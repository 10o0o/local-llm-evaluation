"""One command tree for generation, diagnostics and offline judging."""

import argparse
import tomllib
from pathlib import Path


def parse_args(argv=None):
    parser = argparse.ArgumentParser(
        prog="llm-eval", description="LLM 생성·기록·별도 채점"
    )
    commands = parser.add_subparsers(dest="command", required=True)
    demo = commands.add_parser("demo", help="모델 호출 없는 합성 예제로 실행 흐름 체험")
    demos = demo.add_subparsers(dest="demo_mode", required=True)
    offline = demos.add_parser("offline", help="고정 합성 응답의 추출·저장·채점·요약")
    offline.add_argument(
        "--output", type=Path,
        help="새 출력 디렉터리; 생략하면 results/demo/offline 아래 새 실행 생성",
    )
    data = commands.add_parser("data", help="공식 COCI 테스트 데이터 준비")
    data_actions = data.add_subparsers(dest="data_action", required=True)
    setup = data_actions.add_parser("setup", help="고정 SHA-256의 공식 테스트 데이터 설치")
    setup.add_argument(
        "--archives-dir", type=Path,
        help="공식 contest4/5/6_testdata.zip이 있는 폴더; 생략하면 HTTPS 다운로드",
    )
    generate = commands.add_parser("generate", help="선택한 문제의 응답과 후보 저장")
    providers = generate.add_subparsers(dest="provider", required=True)
    local = providers.add_parser("local", help="실행 중인 로컬 서버에 요청")
    local.add_argument("--model", choices=("qwen36", "gemma4"), required=True)
    local.add_argument(
        "--problems", required=True, help="all 또는 쉼표로 구분한 문제 ID"
    )
    local.add_argument(
        "--round", type=int, choices=(1, 2), default=None,
        help="벤치마크 회차; 생략하면 results/demo에 매번 새로 생성·덮어쓰기",
    )
    cloud = providers.add_parser("cloud", help="클라우드 서버에 요청")
    cloud.add_argument("--model", choices=("luna", "motif3"), required=True)
    cloud.add_argument(
        "--problems", required=True, help="all 또는 쉼표로 구분한 문제 ID"
    )
    cloud.add_argument(
        "--round", type=int, choices=(1, 2), default=None,
        help="벤치마크 회차; 생략하면 results/demo에 매번 새 API 호출·덮어쓰기",
    )
    queue = commands.add_parser("queue", help="Qwen·Gemma 서버와 두 회차를 순차 진행")
    queue.add_argument("--startup-timeout-seconds", type=float, default=900)
    warmup = commands.add_parser("warmup", help="로컬 워밍업; 본 실험 기록에서 제외")
    warmup.add_argument("--model", choices=("qwen36", "gemma4"), required=True)
    judge = commands.add_parser("judge", help="모든 생성과 서버 종료 후 채점")
    modes = judge.add_subparsers(dest="mode", required=True)
    batch = modes.add_parser("batch", help="저장된 원본 후보를 새 세션에서 채점")
    batch.add_argument("--problems", default="all")
    batch.add_argument("--models", default="all")
    batch.add_argument("--rounds", default="all")
    candidate = modes.add_parser("candidate", help="지정한 수정 후보 확인")
    candidate.add_argument("--code", type=Path, required=True)
    candidate.add_argument("--problem", required=True)
    evaluate = commands.add_parser("evaluate", help="원본·시간 완화·최소 수정 평가 기록")
    evaluations = evaluate.add_subparsers(dest="evaluation_action", required=True)
    prepare = evaluations.add_parser("prepare", help="공식 채점 세션에 연결한 검토 파일 준비")
    prepare.add_argument("--baseline", required=True, help="results/judging 아래 세션 ID")
    run = evaluations.add_parser("run", help="시간 재평가 또는 직접 수정한 후보 채점")
    run.add_argument("--evaluation", required=True)
    run.add_argument("--kind", choices=("limits", "repairs"), required=True)
    report = evaluations.add_parser("report", help="검토 누락 확인과 비교표 저장")
    report.add_argument("--evaluation", required=True)
    commands.add_parser("validate", help="문제 목록·문제문·테스트 파일 검증")
    diagnose = commands.add_parser("diagnose", help="본 실험과 분리한 로컬 진단")
    probes = diagnose.add_subparsers(dest="probe", required=True)
    probes.add_parser("response", help="기존 Gemma 응답 진단")
    limit = probes.add_parser(
        "generation-limit", help="기존 고정 문제의 출력 한도 진단"
    )
    limit.add_argument("--model", choices=("qwen36", "gemma4"), required=True)
    return parser.parse_args(argv)


def project_root():
    """Require the selected checkout, never infer it from an installed package."""
    root = Path.cwd().resolve()
    try:
        metadata = tomllib.loads((root / "pyproject.toml").read_text(encoding="utf-8"))
        valid = metadata.get("project", {}).get("name") == "local-llm-evaluation"
        valid = valid and (root / "src/llm_eval").is_dir()
        valid = valid and (root / "data/coci/problems.json").is_file()
    except (OSError, ValueError):
        valid = False
    if not valid:
        raise ValueError("local-llm-evaluation 저장소 루트에서 실행하세요.")
    return root


def dispatch(root, args):
    if args.command == "data":
        from llm_eval.data_setup import setup_dataset

        return setup_dataset(root, args.archives_dir)
    if args.command == "demo":
        from llm_eval.offline_demo import run_offline_demo

        return run_offline_demo(root, args.output)
    if args.command == "generate":
        if args.provider == "local":
            from llm_eval.local.generation import run_selected

            return run_selected(root, args.model, args.problems, args.round)
        from llm_eval.cloud.generation import run_selected

        return run_selected(root, args.model, args.problems, args.round)
    if args.command == "queue":
        from llm_eval.local.queue import run_queue

        return run_queue(root, args.startup_timeout_seconds)
    if args.command == "warmup":
        from llm_eval.local.client import run_warmup

        return run_warmup(root, args.model)
    if args.command == "judge":
        from llm_eval.judging.workflow import run_batch_judging, run_candidate_check

        if args.mode == "batch":
            return run_batch_judging(root, args.problems, args.models, args.rounds)
        return run_candidate_check(root, args.code, args.problem)
    if args.command == "evaluate":
        if args.evaluation_action == "prepare":
            from llm_eval.judging.evaluation import prepare_evaluation
            path = prepare_evaluation(root, args.baseline)
        elif args.evaluation_action == "run":
            from llm_eval.judging.evaluation import run_evaluation
            path = run_evaluation(root, args.evaluation, args.kind)
        else:
            from llm_eval.judging.reporting import report_evaluation
            path = report_evaluation(root, args.evaluation)
        print(f"평가 기록: {path}")
        return path
    if args.command == "diagnose":
        from llm_eval.diagnostics import run_generation_limit_probe, run_response_probe

        if args.probe == "response":
            return run_response_probe(root)
        return run_generation_limit_probe(root, args.model)
    from llm_eval.shared.problems import validate_dataset

    messages, errors = validate_dataset(root)
    for message in messages:
        print(message)
    if errors:
        print("\nValidation FAILED")
        for error in errors:
            print(f"- {error}")
        raise SystemExit(1)
    print("Validation PASSED")


def main(argv=None):
    args = parse_args(argv)
    try:
        dispatch(project_root(), args)
    except (OSError, ValueError, RuntimeError) as exc:
        raise SystemExit(f"ABORT: {exc}") from None
