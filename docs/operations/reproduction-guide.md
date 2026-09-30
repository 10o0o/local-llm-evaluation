# 전체 실행 안내

이 문서는 기존 README의 설치·실행·기록·재현 세부 안내를 옮긴 것입니다. 먼저 [포트폴리오 개요](../../README.md)의 오프라인 합성 데모를 실행할 수 있습니다. 아래 로컬·클라우드 생성은 실제 모델과 외부 API를 사용하며, 과거 실험 조건과 이번 데모를 구분합니다.

## 설치

모든 명령은 저장소 루트에서 실행합니다.

```bash
git clone https://github.com/10o0o/local-llm-evaluation.git
cd local-llm-evaluation
uv sync --locked
```

Python은 `>=3.12`가 필요하고, 패키지와 고정 의존성은 `pyproject.toml`·`uv.lock`이 정의합니다. 인터프리터 자체는 `.python-version`이 `3.12.14`로 고정합니다. Judge는 후보 코드를 실행 중인 인터프리터로 돌리므로 Python 버전이 곧 채점 조건이고, 특히 TLE 판정이 버전에 따라 갈립니다. 고정이 없으면 기기마다 다른 버전이 잡혀 같은 후보의 판정이 달라질 수 있어 `>=3.12`만으로 두지 않았습니다. 모델 가중치, llama.cpp 런타임, API 키, COCI 테스트 데이터는 저장소에 넣지 않습니다. 각자 준비한 뒤 `data/coci/problems.json`의 `statement_path`·`problem_dir`과 시간·메모리 제한이 실제 파일과 맞는지 먼저 확인합니다.

```bash
uv run llm-eval validate
```

이 명령은 문제 목록과 문제문·테스트 입출력 짝이 제자리에 있는지만 봅니다. 모델 품질이나 실험 완료와는 무관합니다.

## 실행

### 로컬 생성

서버는 별도 터미널에서 셸로 띄웁니다.

```bash
bash configs/llama.cpp/qwen36.sh     # 또는 gemma4.sh
```

서버가 준비되면 모델당 한 번 워밍업하고 회차별로 생성합니다. 워밍업은 결과 파일을 만들지 않으며 본 실험 집계에서 제외합니다.

```bash
uv run llm-eval warmup --model qwen36

uv run llm-eval generate local --model qwen36 --problems all --round 1
uv run llm-eval generate local --model qwen36 --problems all --round 2
```

벤치마크 생성은 `--round 1/2`를 명시합니다. 자리를 비울 때는 두 모델과 두 회차를 순차로 처리하는 큐를 씁니다.

```bash
uv run llm-eval queue
```

### 발표 시연

로컬·Cloud 모두 `--round`를 생략하면 기존 벤치마크와 분리해 매번 새로 호출·측정합니다.

```bash
uv run llm-eval generate local --model qwen36 --problems coci_2025_2026_c5_tezina
```

`results/demo/<문제 이름>/<모델>/`의 생성 파일을 덮어쓰며, 실패한 재시연도 이전 시연을 대체합니다. 시연은 일괄 채점·평가 집계와 Git 저장에서 제외합니다. Cloud도 같은 규칙이며 매번 새 API 요청을 보냅니다. 벤치마크 재개는 `--round 1/2`를 명시합니다.

### Cloud 생성

Cloud는 로컬 생성·워밍업·큐·서버와 병행할 수 있습니다. 다만 두 Cloud 모델은 잠금을 공유하므로 서로는 순차로 실행합니다.

`--model`은 필수입니다. 유료 호출의 대상을 기본값으로 추론하지 않기 위해서입니다. 키는 모델별 환경 변수(`openai_secret_key`, `morph_secret_key`)에서 읽으며 값은 출력·문서·결과에 저장하지 않습니다.

```bash
uv run llm-eval generate cloud --model luna   --problems all --round 1
uv run llm-eval generate cloud --model luna   --problems all --round 2
uv run llm-eval generate cloud --model motif3 --problems all --round 1
uv run llm-eval generate cloud --model motif3 --problems all --round 2
```

키를 `.env` 파일로 관리한다면 `uv run --env-file <경로> llm-eval ...` 형태로 넘깁니다. `.env`는 저장소에 포함하지 않습니다.

### 채점

로컬·Cloud 생성을 모두 마치고 모델 서버를 내린 뒤 실행합니다.

```bash
uv run llm-eval judge batch --problems all --models all --rounds all
```

원본 후보를 고친 복사본을 따로 확인할 때는 `candidate` 모드를 씁니다. 이 결과는 모델의 원본 판정과 섞지 않고 보조 평가로만 씁니다.

```bash
uv run llm-eval judge candidate --code path/to/candidate.py --problem <problem-id>
```

### 평가와 보고

`judge batch`는 생성 원본을 공식 1배 시간 제한으로 채점하는 기준 세션이다. 네 모델·10문항·두 회차가 모두 끝나고 로컬 서버를 종료한 뒤 기준 세션을 만든다. 열 문항은 모두 공식 1배 제한의 원본 평가와 최소 수정 보조 대상이다. 네 개의 scoring 문항은 개별 테스트 TLE가 있을 때 2배 제한으로 전체 재평가해 scoring에 반영하고, 나머지 여섯 문항의 2배 재평가는 diagnostic으로 남긴다. 문제문에 넣은 공식 시간·메모리 제한과 생성 프롬프트는 바꾸지 않는다.

```bash
uv run llm-eval evaluate prepare --baseline <세션 ID>
uv run llm-eval evaluate run --evaluation <평가 ID> --kind limits
uv run llm-eval evaluate run --evaluation <평가 ID> --kind repairs
uv run llm-eval evaluate report --evaluation <평가 ID>
```

평가 기준과 파일 형식은 [평가 실행 안내](../operations/evaluation.md)에 둔다. 평가 기준은 생성이 시작된 뒤 확정된 것이므로 사전등록된 기준으로 표시하지 않는다. `CALL_ERROR`는 설명 점수에서 제외하고, `NO_CODE`를 포함한 정상 응답은 직접 설명 점수를 매긴다. 보조 수정본은 원본 정답률에 합치지 않는다.

### 진단

단일 응답 확인과 생성 한도 진단은 본 실험 집계와 분리합니다.

```bash
uv run llm-eval diagnose response
uv run llm-eval diagnose generation-limit --model qwen36
```

## 결과 위치

```text
results/benchmark/<문제>/<모델>/round_<회차>/
├── response.json       # 원본 provider 응답
├── candidate.py        # 추출 코드가 있을 때만
└── result.json         # 요청·생성 설정·호출 상태·지표·추출 코드

results/judging/<세션 ID>/
├── manifest.json
└── <문제>/<모델>/round_<회차>/judge.json

results/evaluation/<평가 ID>/
├── manifest.json, policy.json
├── reviews/<문제>/<모델>/round_<회차>/review.json
├── attempts/<문제>/<모델>/round_<회차>/<attempt-id>/
│   ├── attempt.json, attempt.seal, candidate.py, candidate.diff
└── reports/<unique>/report.json, report.md, review-snapshot.json
```

모델 폴더는 `qwen36`·`gemma4`·`luna`·`motif3`입니다. `result.json`에는 응답만이 아니라 요청 messages와 생성 설정, 호출 성공·실패 상태까지 함께 남깁니다. 나중에 "이 결과가 어떤 조건에서 나왔는지"를 파일만 보고 알 수 있게 하기 위해서입니다.

측정하지 못한 값은 0으로 채우지 않고 사유와 함께 `null`로 남깁니다. 예를 들어 상주 llama.cpp 서버는 요청별 모델 로딩 시간을 노출하지 않으므로 `model_load_seconds`는 `null`이고 `model_load_reason`에 그 이유가 들어갑니다.

`pilot/`, `calibration/`, `diagnostics/`, `archive/`는 각각 다른 의미를 가진 파일군입니다. 설정을 바꿀 때마다 이전 결과를 본 실험에서 내려 보존한 것들이라, 폴더가 있다는 것만으로 실험·채점 완료를 판단하면 안 됩니다. 이름별 의미와 집계 경계는 [결과 안내](../../results/README.md)에 정리했습니다.

## 저장소 구조

```text
.
├── configs/llama.cpp/       # qwen36.sh, gemma4.sh — 서버 실행 설정
├── data/coci/               # problems.json metadata와 준비한 문제 자료
├── docs/                    # architecture, project, operations, history, sources
├── results/                 # 실행하면 생기는 결과군
├── src/llm_eval/            # 단일 CLI와 local/cloud/judging/shared 패키지
├── tests/                   # 책임별 mock·fixture와 합성 경계 테스트
├── AGENTS.md                # 저장소 작업 규칙과 보존 규칙
├── pyproject.toml           # package와 llm-eval console script
├── uv.lock                  # 고정 의존성
└── .python-version          # 채점 조건을 고정하는 인터프리터 버전
```

운영 명령은 `uv run llm-eval`과 같은 구현인 `python -m llm_eval` 둘뿐입니다. 예전에는 `scripts/` 아래에 진입점이 열 개 넘게 흩어져 있었는데, 문서에 적은 명령과 실제 쓰는 명령이 어긋나기 시작해 전부 패키지 안으로 합쳤습니다. 파일별 책임과 호출 관계, 관련 테스트는 [architecture](../architecture.md)에 매핑해 두었습니다.

## 실험 설정과 해석 경계

서버와 요청 설정을 구분해 기록합니다. 두 로컬 모델의 서버 Context는 65,536, 기본 출력 61,440, reasoning budget 53,248, temperature 0입니다. 배치는 다릅니다. Qwen은 `--gpu-layers all --n-cpu-moe 32`에 threads 16 / batch 24로 직접 고정했고, Gemma는 `--gpu-layers auto --fit on --fit-target 0`으로 auto fit에 맡겼습니다. 두 셸 모두 `--cache-ram 0`입니다.

이 파일 값만으로 과거 실행의 실제 적용 조건이나 VRAM 적합성을 소급하지는 않습니다. 특정 실행에 무엇이 적용됐는지는 그 실행의 `result.json`과 서버 로그로 따로 확인합니다. 관측 범위와 미확인 항목은 [실행 환경](../operations/environment.md)에 정리했습니다.

지표도 서로 다른 것을 섞지 않습니다. 요청 전체 경과 시간, llama.cpp 내부 생성 속도, GPU 사용량 관측, Cloud 토큰·비용 추정은 각각 다른 값입니다. 특히 GPU 사용량은 장치 전체 관측값이고 프로세스별 값은 조회되지 않아 사유와 함께 `null`로 남아 있으므로, 모델 단독 사용량으로 읽으면 안 됩니다.

Judge는 테스트별 시간 제한과 stdout·stderr 합산 10 MiB 출력 제한을 적용합니다. **메모리 제한 강제·RSS 측정·MLE 판정은 구현하지 않았습니다.** 따라서 AC는 보유한 테스트를 통과했다는 뜻이지 메모리 제한 준수를 증명하지 않습니다. 기록의 의미와 한계는 [기록 구현 점검](../operations/recording.md)을 참고합니다.

## 재실행 확인

2026-09-17에 **다른 기기에서 저장소를 새로 받아 저장된 응답의 채점·평가 흐름을 재현**했다. 원래 작업하던 PC가 아니라 테스트 데이터도 가상환경도 없는 상태에서 시작했다.

| 단계 | 결과 |
| --- | --- |
| `git clone` 후 `uv sync --locked` | Python 3.12.14 환경 복원 (`openai 3.8.0`, `httpx2 2.12.0`, `pydantic 2.13.5`) |
| COCI 테스트 데이터 준비 | hsin.hr에서 contest 4·5·6 `testdata` 재다운로드 후 `problem_dir`에 배치 |
| `uv run llm-eval validate` | 10문항 전부 `[OK]`, `Validation PASSED` |
| `judge batch` | 80건 중 78건 판정, `coverage_complete=true` |
| `evaluate prepare/run/report` | `complete=true`, `local_comparison_ready=true` |
| 모의·합성 테스트 | `LLM_EVAL_RUN_PROCESS_TESTS=1 ... unittest discover` 181개 통과 |

**테스트 수가 과거 채점 기록과 일치**해(Škare 41, Čokolada 75, Džeparac 104) 테스트 개수가 같음을 확인했다. 개수 일치만으로 파일 내용의 동일성이 증명되는 것은 아니다. 모델 가중치와 llama.cpp 런타임이 없어 생성까지 재실행한 기록은 아니다. 이 과정에서 Judge가 후보 코드를 실행 중인 인터프리터로 돌린다는 점 때문에 `.python-version`을 `3.12.14`로 고정했다. 고정 전에는 이 기기의 Python 3.12가 없어 3.14가 잡혔고, 그대로 뒀다면 기록된 채점 조건과 달라졌을 것이다.

재현에 필요한 외부 준비물은 모델 가중치·llama.cpp 런타임·API 키·COCI 테스트 데이터 네 가지이며 저장소에 넣지 않는다. 생성까지 재현하려면 앞의 두 개가 추가로 필요하고, 저장된 원본으로 채점·평가만 재현하는 데는 테스트 데이터만 있으면 된다.

## 문서 지도

| 문서 | 역할 |
| --- | --- |
| [architecture](../architecture.md) | 파일별 책임·호출자·테스트 매핑 |
| [로컬 실행 안내](../operations/local-runbook.md) | 서버·워밍업·두 회차·큐·채점 절차 |
| [Cloud 비교 안내](../operations/cloud-runbook.md) | Luna·Motif-3 실행 조건, 모델별 키 로드, 비용 경계 |
| [실행 환경](../operations/environment.md) | 장비·버전·서버 설정의 관측 범위와 미확인 항목 |
| [기록 구현 점검](../operations/recording.md) | 지표·저장·누락값·Judge 한계 |
| [평가 실행 안내](../operations/evaluation.md) | 기준 세션·제한 재평가·보조 수정·설명·집계 |
| [요구사항과 평가 기준](../project/requirements.md) | 사용 사례, 60% 통과선, 선정 순서, 설명 정확성 기준 |
| [평가 질문 10개](../project/evaluation-questions.md) | 문항별 기대 결과, 정상·경계 사례 구분, 동일 조건과 차이 |
| [최종 선정 보고서](../project/model-selection-report.md) | 선정 결과와 근거, 대표 실패 사례, 한계 |
| [Local–Cloud 비교](../project/local-cloud-comparison.md) | 품질·속도·비용·보안·운영 실측과 운영 권고 |
| [생성 기록 진단](../history/generation-diagnostics.md) | reasoning 반복, 회차 중복, 후보 코드 결함 유형 |
| [모델 후보 조사](../project/model-candidates.md) | 후보 비교표, Model Card·License, 제외한 후보 이력 |
| [발제 원문](../project/assignment.md) · [평가표](../project/assignment-rubric.md) | 과제 기준과 사용자 정의 조건의 구분 |
| [단계별 학습 안내](../project/learning-guide.md) | STEP 1~8 진행 순서와 완료 근거 |
| [결과 안내](../../results/README.md) | 결과군 이름·집계 제외·채점 세션 의미 |
| [정리 이력](../history/README.md) | 이전 경로와 Git 복원 정보 |
| [결정 이력](../history/decision-log.md) | 2026-09-14~09-17 시점별 결정·관측; 종료로 닫힘 |
| [유지보수 이력](../history/maintenance-log.md) | 통합·검증 기록과 종료 시점 상태; 종료로 닫힘 |
