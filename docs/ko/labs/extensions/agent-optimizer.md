# Agent Optimizer: 후보를 만들고 실제 근거로 판단하기

[English](../../../labs/extensions/agent-optimizer.md) | **한국어**

**C 선택 Preview · 2026-09-16 기준, 2026-09-23 `gpt-6-sol`로 재실행.** 첫 경로는 **Prompt Agent 최적화 wizard**입니다.
fine-tuning이나 모델 가중치 변경이 아닙니다. 기존 Hosted matrix와 수동 v1/v2 실험은 별도 대상으로 유지합니다.

**준비:** 전용 합성 Prompt Agent와 baseline 버전, 파생 dev 파일, 지원되는 기존 optimizer 배포, 별도 judge, 비용 승인.
**완료:** 한 실행의 baseline과 모든 반환 후보를 확인하고, 후보 없음/개선 없음도 명시함.
**중단:** 촬영을 끝내려고 다른 모델 생성, holdout 수정, 후보 자동 승격을 하지 않습니다.

**첫 회차:** 1–5절 후 `optimizer-review.txt`를 인계합니다. 승격은 필수가 아닙니다.
후보 없음·개선 없음·잘못된 evaluator binding은 보존할 발견 사항이지 승격 성공이 아닙니다.

## 1. 입력 한 번 준비

[Lab 03](../03-prompt-agent.md)의 전체 합성 정책을 가진 내 agent를 사용합니다.
원래 지침/버전을 보존합니다. 아래의 로컬 입력을 준비하고 선행 조건을 충족한 뒤에만
Lab 03 절차로 본인 prefix의 격리 복사본을 만듭니다.
공유 agent나 이미 고정된 benchmark target을 변경하지 않습니다.

**로컬 준비부터 합니다.** 아래 명령에는 [Lab 00 B의 준비된 `.venv`](../00-start.md#b-코드--한-폴더-한-환경)
(`python-dotenv` 포함)와 `.env`에 기록한 설정 카드의 `WORKSHOP_PREFIX`가 필요합니다.
로컬 파일만 읽으며 Azure 로그인·모델 호출·최적화 job은 수행하지 않습니다.
`outputs/extensions-ko/`가 아직 준비되지 않았다면 저장소 루트에서 실행합니다.

```bash
source .venv/bin/activate
python scripts/workshop.py --language ko prepare-extensions --label extensions-ko
```

`outputs/extensions-ko/`에서 `optimizer-dev.jsonl`, `SOURCE.json`, `manifest.json`, `preparation.json`을 확인합니다.
재사용한다면 `SOURCE.json`의 언어가 `ko`, prefix가 본인 값, `dataset_split`이 `dev`인지 확인합니다.
`preparation.json`에는 `mode: local-materials`, `azure_requests_sent: false`가 있어야 합니다.
폴더가 존재한다는 사실만으로 준비가 완료된 것은 아닙니다. 파일이 없거나 다른 입력으로 만든 자료라면 업로드하거나 덮어쓰지 않습니다.
원래 자료를 보존하고 사용하지 않은 label을 명시적으로 골라 준비한 뒤, 아래 모든 업로드 경로에 새 폴더를 사용합니다.
원본 **dev 6행**에서 파생되며 holdout이나 새 target 정답은 만들지 않습니다.
`query`만 agent 입력입니다. `context`, `ground_truth`는 평가 참조이며 target에 보내는 지침이 아닙니다.
wizard가 요구하는 열을 확인하고 임의 column mapping이 가능하다고 가정하지 않습니다.

| 값 | 첫 실행의 선택 |
|---|---|
| Target | 내 합성 Prompt Agent의 실제 baseline 버전 |
| 답변 모델 | 기존 검증된 배포, 첫 실행에서 모델 비교 제외 |
| Optimizer | 담당자와 wizard가 지원을 확인한 기존 배포 |
| Evaluator | 별도로 이름 붙인 승인된 judge |
| 원시 judge 입력 | 각 평가자의 실제 `sample.input`과 evaluation ID를 확보할 경로를 담당자가 확인 |
| Dataset | `optimizer-dev.jsonl` 6행, holdout 금지 |
| Max candidates | **2** |
| 최적화 대상 | **Instruction만** |

지원되는 optimizer 모델이 없다면 `optimizer-review.txt`에 로컬 입력 폴더와
`inputs prepared; optimization not run`을 적고, 격리 agent 생성이나 job 제출 없이 인계합니다.
원시 judge 입력을 확보할 수 없어도 같은 지점에서 멈추고 `inputs prepared; optimization not run — raw-input review unavailable`을 적습니다.
[아래 읽기 전용 내보내기](#raw-judge-export)는 2026-09-27에 확인한 검토 경로입니다.
복사본 생성이나 유료 실행 제출 전에 프로젝트 평가 읽기 권한과 비용 승인을 확인합니다.
답변 모델이 동작한다는 사실만으로 optimizer 용도를 지원한다고 판단하지 않습니다. `gpt-6-sol`만 배포된 2026-09-23에는
**Optimize** 탭이 **No supported optimization model**을 표시했습니다. 그날
[Microsoft Learn의 optimizer 모델 목록](https://learn.microsoft.com/azure/foundry/agents/concepts/agent-optimizer-overview#models)은
`gpt-5`, `gpt-5.1`, `gpt-5.2`, `gpt-5.4`, `gpt-5.5`, `DeepSeek-V4-Pro`, `DeepSeek-V-3.2`였습니다. 9월 23일 실행에서는 담당자가
임시 `gpt-5.5` 배포(`<prefix>-opt-gpt55`, DataZoneStandard)를 추가했고 두 언어 실행이 끝난 뒤 삭제했습니다.
최적화 대상은 Lab 03 에이전트와 지침이 같은 격리 복사본 `<prefix>-optimize` 버전 1이었습니다.
2026-09-25에도 프로젝트에는 지원 optimizer 배포가 없었습니다. 읽기 전용 확인에서 `gpt-5.5` 할당량이 남아 있었지만 할당량만으로 배포 준비 요건을 충족하지는 않습니다.
담당자가 별도로 승인해 지원 optimizer 배포를 준비하고 wizard에서 확인할 때까지 이 모듈은 **미실행**으로 남깁니다.

## 2. 최적화 마법사 열기

1. **에이전트 → 내 에이전트 → 최적화 미리 보기**(영문 UI: **Optimize Preview**)를 엽니다. 9월 23일 실행은 영문 UI에서 진행했으므로
   이하 wizard 이름은 영문 UI 기준입니다.
2. 처음에는 **Optimize my agent**, 기존 run이 있으면 **Create optimization run** 또는 **Optimize**를 선택합니다.
   메뉴가 나오면 별도 **Cost** 분기가 아니라 **Agent**를 선택합니다(2026-09-27 관찰).
3. Target에서 실제 baseline 버전을 확인합니다.
4. 준비된 optimizer/judge와 후보 수 2를 지정합니다.
   9월 23일에는 **Evaluation model** 기본값이 답변 배포 `gpt-6-sol`이었으므로 `gpt-6-sol-judge`로 바꿉니다.
5. **Choose targets → Instruction**을 선택하고 **Model**을 해제합니다.

명시적 대상 선택으로 전환할 때 Model이 자동 선택되었던 화면을 관찰했습니다.
실제 체크 상태를 확인합니다.
계속하기 전에 agent 이름/버전, 선택한 배포, 원래 지침을 기록합니다.
optimizer model은 변경을 생성하고 target은 질문에 답하며 judge는 답변을 채점합니다. 이들은 서로 다른 역할입니다.
제품의 예시 benchmark 점수는 내 baseline이나 결과가 아닙니다.

## 3. dev와 평가 기준 선택

1. Data에서 **Select dataset and criteria**를 선택합니다. 기본 production-trace 생성 경로를 사용하지 않습니다.
2. **Upload dataset**으로 내 국문 이름을 주고 `outputs/extensions-ko/optimizer-dev.jsonl`을 업로드합니다.
3. 새 dataset 버전과 `case_id`, `query`, `context`, `ground_truth`를 확인합니다.
4. 미리보기는 **상위 5행만** 보여줍니다. 원본 파일과 나중의 실제 평가 결과에서 6행 전체를 확인합니다.
5. Criteria에서 **Custom only**를 해제하고 **Groundedness-Evaluator**, **Relevance-Evaluator**를 고릅니다.
   Service-Groundedness와 혼동하지 않습니다. 고를 때마다 **Configure** 대화상자가 열리면 **Threshold**를 **4**로 두고 **Apply**를 누릅니다.
   실제 버전을 기록하고 같은 criteria, threshold, reference data를 run 전체에서 유지합니다.

필수 인용 기준을 완화하거나 올바른 승인 거절을 오답으로 바꾸거나 어려운 행을 빼서 점수를 올리지 않습니다.
service가 schema 불일치를 보고하면 멈추고 실제 요구 사항을 확인합니다.
열 이름을 몰래 바꾸거나 evaluator label을 target에 보내지 않습니다.

## 4. 비용 검토 후 한 번 제출

Review의 baseline/dataset/모델/평가 기준/후보 상한을 확인합니다.
답변·judge·개선 생성 비용을 구분합니다. 표시된 범위는 **추정치**이지 실제 청구액이나 강제 예산 제한이 아닙니다.
9월 23일에는 agent 호출 약 35회, 채점 약 70회, 개선 생성 약 3회에 추정 $0.27(범위 $0.00–$0.90)로 표시되었습니다.

담당자가 표시된 예상 비용을 승인한 뒤 **Submit**을 한 번 누릅니다. 같은 run ID를 끝까지 확인합니다.
대기하거나 화면을 놓쳤다는 이유로 재제출하지 않습니다.
실패/불완전 실행의 성공 부분만 좋은 후보로 보고하지 않습니다.

## 5. 후보보다 세부 결과 먼저

<a id="raw-judge-export"></a>

### 실제 평가자 입력 내보내기

실행 상세의 **Download JSON**은 optimizer 설정·결과·토큰 사용량·반환한 후보 ID를 보존합니다.
**Candidate results → Score details**에서 baseline 평가 링크를 열고 **두 ID**를 기록합니다.
`eval_…`와 `evalrun_…`가 필요하며 optimizer의 `opt_…` ID와 다릅니다.
6행 baseline은 준비한 소스 저장소 루트에서 사용하지 않은 내보내기 label로 실행합니다.

```bash
printf 'Actual baseline evaluation ID (eval_...): '; read -r EVALUATION_ID
printf 'Actual baseline evaluation run ID (evalrun_...): '; read -r EVALUATION_RUN_ID
python scripts/export_evaluation.py --language ko \
  --evaluation-id "${EVALUATION_ID:?Use the actual evaluation ID}" \
  --run-id "${EVALUATION_RUN_ID:?Use the actual evaluation run ID}" \
  --expected-rows 6 --label optimizer-baseline-raw --require-judge-inputs
```

이 **읽기 전용 Azure 요청**은 정의·실행·전체 출력 페이지를 조회하며 모델을 새로 호출하지 않습니다.
실패·원래 점수를 포함한 `outputs/evaluation-exports/optimizer-baseline-raw/`를 보관합니다.
대기 중인 실행, 누락·중복 행, 없는 judge 입력은 명시적으로 실패합니다. 같은 실행을 나중에 새 내보내기 label로 조회하되
optimizer job을 다시 제출하지 않습니다. 각 후보가 실제 실행한 사전 정의 분모를 사용하며 성공한 행 수로 바꾸지 않습니다.

`output-items.json`의 `results[].sample.input`은 실제 judge 메시지입니다.
그 안의 JSON `content`에서 실제 `context`·`query`·`response`를 원래 고정 파일과 비교합니다.
`judge_inputs_available: true`는 근거를 읽을 수 있다는 뜻이지 **참조 연결이 유효하거나 승격을 승인했다는 뜻이 아닙니다**.
내보내기는 항상 `quality_approved: false`를 유지합니다.

각 후보에 대해 다음을 보관합니다.

- 전체 evaluator 결과와 실제 case 분모.
- 전후 지침 diff와 바뀐 모델/도구 설정.
- 모델/phase별 실제 token 사용량. 누락된 측정값은 누락된 상태로 둡니다.
- 실패 case와 제안 문구가 여전히 근거·날짜·승인 경계를 보존하는지 여부.

가장 높은 종합점수도 제안일 뿐 자동 수락이 아닙니다.
개선이 없거나 구별되지 않으면 baseline을 유지합니다.
유용하게 측정된 개선 없이 문구만 바뀌는 것은 성공 주장으로 보지 않습니다.

2026-09-23 `gpt-6-sol` 실행은 9월 16일 영문 실행(이전 `gpt-5.6-luna` 판)처럼 두 언어 모두 baseline만 반환했습니다.
영문 0.979, 국문 0.938이며 각각 약 4.5분 걸렸습니다. 실행마다 내부 초안 4개를 3건짜리 미니 배치로 평가했지만 후보로 반환하지 않았습니다.
일반 중단 문구는 모든 후보가 만점이라고 표시했지만, 국문 baseline은 D05 relevance(2)가 실패했고 영문 미니 배치는 D01·D05·D06 relevance가 실패했습니다.
9월 16일 국문 실행은 별도로 실행한 baseline과 두 후보를 남겼습니다.
상태 문구 대신 개별 행을 확인하고 영문 점수를 국문 결과로 옮기지 않습니다.

**업로드한 열뿐 아니라 실제 judge 입력을 확인합니다.** 각 평가자의 `sample.input`과
고정한 dataset을 1절에서 확인한 검토 경로로 비교합니다.
본인 실행의 입력을 확보할 수 없다면 `optimizer-review.txt`에 `judge inputs unavailable / review incomplete`를 적고
run/evaluation ID와 확인 가능한 결과를 보존하며 **승격하지 않습니다**. 업로드한 열·종합점수·과거 관찰로 빠진 근거를 대신하지 않습니다.
9월 23일 두 언어 실행에서도, 9월 16일 영문 baseline과 국문 baseline·두 후보처럼
Groundedness의 `context`에 원래 정책 대신 생성한 답변 자체가 들어갔습니다.
서비스가 6/6을 보고해도 자기 답변과의 비교는 원문 근거 검증이 아닙니다.
원래 점수·입력 hash를 보존하고 참조 binding을 무효로 표시하며 **이 결과로 승격하지 않습니다**.
촬영 결과를 좋게 만들려고 열·기준을 몰래 바꾸거나 새 run을 제출하지 않습니다.

**2026-09-27 재확인:** 별도 승인된 `gpt-5.5` optimizer, 기존 `gpt-6-sol` target과 별도 judge로
범위를 제한한 instruction 전용 실행 한 번을 완료했습니다. Baseline만 반환했고 점수는 0.958이었지만,
실제 groundedness 입력 6개 모두 고정 corpus가 아니라 생성한 답변 자체를 `context`로 사용했습니다.
참조 연결을 무효로 표시하고 승격하지 않았습니다. 성공 상태나 일반적인 만점 안내가 이 판단을 바꾸지 않습니다.

`optimizer-review.txt`에 run, baseline/candidate ID, 관찰, 로컬 입력 폴더와 업로드한 dataset 버전, 선택 후보 또는
`pending-human-review`, 이유를 적습니다. AI가 사람의 검토를 사칭하지 않습니다.

## 6. 사람 승인 후에만 승격

<details>
<summary>선택 승격 — Optimizer 종료 뒤 자동으로 실행할 단계가 아닙니다</summary>

검토가 없으면 **미수행**으로 남깁니다.
명시적 승인 후 **Promote candidate → Promote to agent version**을 사용하고
새 실제 버전과 default 변경 여부를 기록합니다.
새 label로 확인한 다음 baseline으로 사용합니다.
이전 버전의 holdout 점수는 새 버전에 자동 적용되지 않습니다.

후보를 고정한 후에만 별도의 최종 인수에서 holdout을 사용합니다.
이 Optimizer 실행은 개발용으로 holdout을 열지 않습니다.

</details>

## 이후 선택 기능

함수 설명 최적화는 실제 함수 실행 검증이 아닙니다.
Prompt Agent 함수는 client에서 실행되며 optimizer는 그 최적화 중 함수를 실행할 수 없습니다.
Hosted 최적화는 optimizer-ready code와 baseline configuration이 필요하고 실제 도구를 반복 실행할 수 있습니다.
read-only 합성 도구와 검토된 비용을 갖춘 별도 준비 workspace에 보관합니다.
이 portal 실습에 flag 하나를 붙인 것과 같지 않습니다.

**다음:** [대화 평가](conversation-evaluation.md), [C 모듈 선택](../../paths/c-advanced.md), 또는 [Lab 11 인계](../11-capstone.md).
[Prompt wizard](https://learn.microsoft.com/azure/foundry/agents/quickstarts/quickstart-optimize-prompt-agent) ·
[Agent별 제약](https://learn.microsoft.com/azure/foundry/agents/concepts/agent-optimizer-overview) ·
[비용 계산](https://learn.microsoft.com/azure/foundry/agents/concepts/agent-optimizer-costs).
