R20261020-WORKFLOW-DESIGN: Pointsman을 Claude Code Workflow로 옮기는 설계 검토. 결론은 혼합안: 실험 실행기(Node)는 유지하고, Jev 판단을 MCP 도구로 감싼 제품용 Workflow 모드를 따로 둔다. 위험: 작업자 격리 상실(모든 도구·CLAUDE.md 주입), 무료 리허설 불가, 작업자별 비용 미확인. 다음: 사용자 정의 agentType 도구 제한 실험. 코드 변경·실행 없음. [기록](decisions/R20261020_WORKFLOW_DESIGN.md). 아래는 당시 기록이다.

R20261019-RESULTS-ANALYSIS: D095 계열 병합(b444a5f) 후 실제 결과 분석. openapi Claude단독 3/3·38.3분·$19.83, Jev 현재경로 4/9(성공시 27.5분·$7.89, 실패포함 성공당 $18.73·57.5분). h2 보류과제 1/4(실패3은 경로결함), 리허설 관문 후 유료 2/2 성공. Jev 우위 미입증: 같은 실행 Claude 기준·반복 필요. [기록](decisions/R20261019_RESULTS_ANALYSIS.md). 아래는 당시 기록이다.

R20261019-PAID-OPENAPI-02: Jev 모델 관문 3곳 정리(895b49e) — 무료 사전점검이 정산 모델 중 admission 미허용이 있으면 exit 3. 사전점검 exit 0, h2·openapi 리허설 4/4(같은 tree) 뒤 openapi jev_profile 유료 1회: 완료, 공개 8/8(assertion 2,236), 독립 63/63(product_success), 1,895.0초, 수리 0, Claude API환산 $10.85, Jev 7회 196,662토큰, 장부 28,360,261→28,556,923 정산·예약0. Jev 응답에 1.14 없음. 1회 성공은 성공률 아님. [기록](decisions/R20261019_PAID_OPENAPI_02.md). 아래는 당시 기록이다.

R20261019-ADMISSION-V5: 토큰 admission v5(328c105)가 공식 문서 근거(1.14 기본 한도 64k/32k로 1.13과 같음)로 jev-1.14.0·typesafe/jev-1.14-20261014만 추가 허용, h2·openapi v12 manifest만 opt-in. 리허설 가짜 Jev는 무료 모델 목록 기준 현재 서빙 dated 빌드로 응답. v11 재고정·d076 재연결, 테스트 1421/1422. 리허설(깨끗한 트리, 장부 불변): h2·openapi 4/4 통과(전 응답 1.14, 전 admission 통과); v4로 되돌린 대조 실행은 baseline에서 차단돼 이제 무료로 잡힘. 유료 전 기록 커밋에서 재리허설 필요. [기록](decisions/R20261019_ADMISSION_V5.md). 아래는 당시 기록이다.

R20261019-PAID-H2-OPENAPI: 리허설 통과 뒤 jev_profile 유료 1회씩(441eb32, Mac). h2 완료·공개 통과·독립 25/25(product_success, h2 첫 성공), 1,177.5초, Claude API환산 $5.19, Jev 5회. openapi는 0라운드 공개 실패 뒤 Jev 응답이 typesafe/jev-1.14-20261014라 토큰 admission v4(1.13만 검증)가 수리 프로필 요청을 보내기 전 차단(ADAPTIVE_TOKEN_PREFLIGHT_BLOCKED), 1,312.9초, Claude $8.03. 장부 정산 완료·예약 0. 리허설은 기록 모델 ID만 재생해 이 경우를 놓침. 재실행 없음. [기록](decisions/R20261019_PAID_H2_OPENAPI.md). 아래는 당시 기록이다.

R20261019-REHEARSAL-E: 부분수리 뒤 공개실패가 ADAPTIVE_CAUSAL_HISTORY_INVALID로 멈추던 결함 수정(2b98f84, causal 기록에 local_repair_round_indices). 테스트 1418/1419. 재리허설(깨끗한 트리, 장부 불변): h2·openapi 모두 4/4행 통과. openapi 고장 대상은 스케줄에 따라 바뀜; n3 대상 재실행 2회에서 로컬수리(결과물5)→공개실패→check-error 수리→완료 확인. 유료실행 전 기록 커밋에서 재리허설 필요. [기록](decisions/R20261019_REHEARSAL_E.md). 아래는 당시 기록이다.

R20261019-REHEARSAL-D: 사용자 선택 1번 — local-readiness-v1에서 한 작업의 실패한 로컬 readiness 검사를 한 라운드에 모두 보고(647638d, 검사 게이트 파일은 카탈로그 고정이라 adaptive-dag-execution.mjs에서 처리), 테스트 1417/1418. 재리허설(깨끗한 트리, 장부 불변): h2 4/4행 통과(readiness_failure가 수리 1회로 완료). openapi 3/4: 결과물 5개를 한 번에 고쳤으나 readiness가 못 보는 .jinja 고장이 공개 검사에서 드러나고, 부분수리 뒤 공개수리는 causal 기록 길이 불일치(ADAPTIVE_CAUSAL_HISTORY_INVALID)로 멈춤. openapi 관문 닫힘; h2는 최종 커밋에서 재리허설 필요. [기록](decisions/R20261019_REHEARSAL_D.md). 아래는 당시 기록이다.

R20261018-REHEARSAL-C: 무료 리허설 공백 보완(2d75833). 결과물 미작성(DAG_RUNTIME_ARTIFACT_MISSING)을 정확한 소유자 1개가 무호출로 수리, 가짜 작업자는 수리 묶음의 허용 경로만 씀, openapi-partial-repair-v12.json 추가(d085 불변). 고정 파일 변화 없음(v11·d076 불변), 테스트 1416/1417. 재리허설(깨끗한 트리, 장부 불변): h2·openapi missing_output 해결, readiness_failure는 둘 다 ARTIFACT_CHECK_NOT_PASSED. 원인은 가짜 쪽이 아니라 readiness 검사 첫 실패 중단+수리 2라운드 고정(REHEARSAL-B double_limit 정정). 관문은 계속 닫힘. [기록](decisions/R20261018_REHEARSAL_C.md). 아래는 당시 기록이다.

R20261018-REHEARSAL-B: 기록 기반 무료 리허설·유료 실행 관문·Jev 모델 사전점검·앱 CLI(2.1.299)·카탈로그 realpath 비교 구현(f9d32e4), 테스트 1414/1415. 리허설(무료, 장부 불변): h2·openapi baseline 완료, 미지 모델은 장부 복사본에서만 차단. 새 결함 발견: 작업자 무출력(DAG_RUNTIME_ARTIFACT_MISSING)은 부분수리 대상 아님. openapi 기본 manifest는 부분수리 꺼짐. 관문이 두 과제 유료실행을 막는 상태. 과제조사: openapi보다 작은 과제64개, 후보6. [기록](decisions/R20261018_REHEARSAL_B.md). 아래는 당시 기록이다.

R20261018-DESIGN-SELECTION: 반복 실행경로 결함 원인 분석·재설계안 선정. 실패 arm 41개 중 30개(73%)가 품질이 아닌 경로·환경·인프라 원인, 최근 결함7개 중3개는 수정이 다른 곳에 있었음(브랜치 세갈래). 설계안3개(계약·무과금 리허설·단일줄기) 블라인드 판정: 리허설58·계약56·단일줄기48/70. 리허설 안 선정 + 계약안의 단일줄기 검사·종료원인 분류 완전성·공통함수 통합 병합. 추정배율 정산·작업폴더 삭제는 거부. 구현 미착수. [기록](decisions/R20261018_DESIGN_SELECTION.md). 아래는 당시 기록이다.

R20261018-HELDOUT-PILOT 3회차: 부분수리·1.14정산 반영 후 h2 재실행도 n1이 3번(haiku low→haiku medium→sonnet medium) 모두 준비검사 실패, 수리2회 소진·1187.9초 ARTIFACT_CHECK_NOT_PASSED, 공개검사0·0점. 원인은 모델이 아니라 검사기: h2 이미지 Python3.10에 tomllib 없음→pyproject.toml 검사 항상 실패. 같은 파일 재생 시 수정 전 실패·수정 후 통과(ddbf44d, tomli 대체). 세 번 모두 실행경로 결함으로 멈췄고 Jev 판단 품질의 근거 아님(앞선 Haiku 원인 서술 정정). [기록](decisions/R20261018_HELDOUT_PILOT.md). 아래는 당시 기록이다.

R20261018-HELDOUT-PILOT 2회차: partial_repair(local-readiness-v1) 켜고 h2 재실행. Jev가 n1에 또 haiku55_low 선택→n1 준비검사 재실패, 이번엔 부분실행 수리가 모델호출0으로 n1 수리를 확정(이전 binding 거부 해소). 이어 수리 프로필 단계 719.6초에 BUDGET_MODEL_UNSUPPORTED(불확실): Jev 응답이 typesafe/jev-1.14-20261014였고 정산 허용목록에 없었음(D086과 같은 원인). D086 오프라인 정산도구로 8,444토큰 1회 정산(장부1555·pending0). 공개검사0·미채점, 프로토콜상 0점. 1.14 허용·부분수리 모두 반영됨. [기록](decisions/R20261018_HELDOUT_PILOT.md). 아래는 당시 기록이다.

R20261018-HELDOUT-PILOT: 보류과제 h2 시범1회(jev_profile, Claude작업자) 실패. 855.6초 뒤 repair_owners에서 ADAPTIVE_INFERRED_ARTIFACT_BINDING(같은 코드 3번째). Jev가 n1에 haiku55_low 선택→준비검사 실패→n3·공개검사 미실행→부분실행 수리binding 거부. 공개검사0회·수리0회·미채점, 프로토콜상 0점. Claude API환산$4.56, Jev 5호출·86,374토큰(장부1549·pending0). 카탈로그 114.6초·산출물13·단위12. v8+경로는 jev_profile만 허용해 Claude단독 비교 없음. [기록](decisions/R20261018_HELDOUT_PILOT.md). 아래는 당시 기록이다.

R20261017-EVAL-PROTOCOL 완료: Harness A/B 연구와 평가 방법 비교, 평가 구조화. [구조·점검표·보류과제](orchestration/EVALUATION_PROTOCOL.md) · [결정](decisions/R20261017_EVAL_PROTOCOL.md). 정본 evaluation-protocol.v1(ITT·Wilson·14점검). pstack(cursor/plugins101b274) 병렬분석 추가, 점검 후보C15–C22는 사용자 검토 대기. 로컬+형제worktree arm54(집계44·제외10·미분류0): Jev 점검 yes9/14, Harness yes2/14. 같은 실행 쌍 claude_all대jev_all 2승1무0패, codex대jev 2승0무1패라 Jev 우위 미입증. 작업브랜치는 origin/research보다9커밋 뒤·미병합. 미충족 C06반복·C08후보1누락·C11과제1개·C12보류과제·C14재현. 보류과제15개 고정(실행 전 과제별 의무·카탈로그·공개검사 필요). 유료·Docker·재채점 없음. 아래는 당시 기록이다.

## 2026-10-18 — 보류 과제 manifest를 적응 실행기에 연결
[기록](decisions/HELDOUT-20261018.md). h2·pycparser·django-modelcluster의 `v12.draft.json`이 자기 공개 registry로 로더를 통과한다. registry는 `public-checks.plan.json`에서 생성했다. openapi(d056 input) manifest는 기존 registry.v4 규칙·93/85 수·감사 설정을 그대로 쓴다. 보류 manifest를 openapi registry로 돌리면 이제 `ADAPTIVE_PUBLIC_REGISTRY_BINDING`으로 거부된다(이전에는 수락). 카탈로그 해시가 모두 null이면 로드·probe만 허용하고, arm은 `ADAPTIVE_CATALOG_REUSE_UNPINNED`로 거부한다. 채점 스크립트에 `--image-lock`을 추가했고, 기대 검사 수는 grade manifest의 `test_case_count`에서 읽는다. runner가 바뀌어 전송 정책 v11을 고정하고 d076을 v11로 다시 묶었다. `--probe` ×3은 로더를 지나 각 과제의 `public-checks/inventory.json` 부재(ENOENT)에서 멈춘다. 유료·모델·Docker 호출 0, 공유 원장 무변경, 커밋 없음.
## 2026-10-18 — 보류 과제 3개 과제별 공개 검사, --probe ready
[기록](decisions/HELDOUT-20261018.md). h2·pycparser·django-modelcluster에 `public-checks/`를 만들었다(검사 58/62/88개, 공유 harness 1벌, 과제별 `cases.py`, `instruction.md`만으로 쓴 정상 대조 참조 구현과 결함 대조 52/53/88개). Docker 대조 고정 receipt는 세 과제 모두 정상 통과·결함 전부 거부·`verified`이고, `--probe` ×3은 `ready`(blocker 0, 유료 0, Jev 추론 0)다. 감사 스크립트를 고치자 openapi 고정 receipt가 `PUBLIC_CONTROL_FROZEN_SOURCE_DRIFT`로 깨지는 것을 측정했다. 그래서 원래 파일을 HEAD 바이트로 되돌리고 held-out 감사를 `scripts/audit-task-public-checks.mjs`로 분리했다. openapi receipt는 다시 `verified`다. 남은 것: 과제별 유료 카탈로그 준비(클라우드), 1단계 비교 조건 결정. 공유 원장 무변경, 커밋 없음.

연구 마무리(2026-10-17): 사용자 요청으로 D095까지를 `research-d095-final-20261017`에 보관한다. [보관 범위·공개 요약·검증과 남긴 일](research/D095_CLOSEOUT.md). 기존 원격 research의 별도 D085 변경과 측정 소스 결속을 보존하기 위해 독립 연구 브랜치를 사용한다. 추가 개발·유료 실행·자동 재개는 시작하지 않는다. 아래 commit/push 미수행 문구는 각 실험 종료 당시 기록이다.

D095 종료(2026-10-17): 공개 v5 검사와 실제 담당 연결·v16 회차 결속 수정 후 공개 93/93·독립 63/63 완료. 수리 2회차/작업자 7회, 34분 16.680초, 캐시 포함 2,101,095토큰, 참고 비용 추정 $14.8056879. 과거 Claude 단독 대비 시간·토큰·비용 절감은 미달했다. 첫 실행기 실패 643,247토큰/추정 $4.1821504도 보존했다. [상세 결과](orchestration/D095_PUBLIC_BOUNDARIES_RESULTS.md). 기존 결과 12,817파일 변경 0, 실제 청구 미확인, commit/push 없음.

D092(2026-10-17): high 고정 제거, 모델×노력도 23조합·공개 성과 85관측/710근거·v9 필수 전송 게이트와 실제 실행 인자를 연결했다. [결과와 검증 경계](orchestration/D092_MODEL_EFFORT_HISTORY.md), [실패 이력](orchestration/D092_FAILURE_HISTORY.md). 모델 선택 입력은 공개 정보만, 무표본 unknown을 유지한다. 이전 스냅샷과 점검 실패를 보존했다. 전체 E2E 개선 실험은 이번에 수행하지 않았다. 실제 승인된 Jev 선택 1회는 6.1-sol/high, 3.338초·14,714토큰, worker 0회였다. 원래 장부 입력 +14,372·정산 +1·pending 0을 확인했다.

D091 작업 완료(2026-10-16): 입력AST/템플릿가족 투영·lossless owner·Jev 모델선택과가격v2를연결하고새3조건실행/독립감사. Codex93/63완료529592토큰, Jev고정93/60미완료527950, Jev모델선택82/57미완료1435202. 실제초기Luna4+Sol1/수리Sol8. 기록은 [D091 결과](orchestration/D091_CODEX_RESULTS.md). 사후집계8검증과모델0재채점은원래실험과분리. 기존57143파일·원실행439소스보존.

D090 현재(2026-10-16): 앱 실제 CLI0.162.0-alpha.17.2·gpt-6.1-sol/high 기본 연결과 모델별 참고 정산으로 새 순차1쌍을 종료했다. [결과](orchestration/D090_CODEX_RESULTS.md) · [기록](decisions/D090.md). 두 조건 모두 공개93/93·독립63/63으로 제품 완료2/2. Codex24분42.255초·478030토큰·참고$1.749668, Jev22분37.343초·503013토큰·참고$1.5037936: 전체시간8.4272%↓·토큰5.2262%↑·참고액14.0526%↓(Codex분모). 단가 가정/실청구unknown 구분, 초기 판단34.888배는 전체 가속률 아님. Jev실제수리1회·투영감축0B·추가문맥첨부0B. 기본Codex경로D090 manifest/gatewayv6, 역사계약·결과55178파일보존, 소스427불변. 추가자동실행/commit/push없음. 아래는각당시기록이다.

## 2026-10-16 — 앱 CLI 새 모델 조회·소규모 실제 호출

[연결 확인](orchestration/APP_CLI_MODEL_DISCOVERY_20261016.md) · [기록](decisions/R20261016_APP_CLI.md). 같은 인증/새임시HOME/과거캐시없음에서 구형CLI와앱CLI모델목록차이확인. 기존어댑터에앱경로를명시한6.1-sol/high1회성공, 성능비교아님. 실제binary핀범위차이도명시했고원본인증/실험/기본CLI/장부수정없음.

## 2026-10-16 — D089 수리 입력·담당 근거 개선과 실제 Codex/Jev 비교

- [역할](agents/D089_REPAIR_EFFICIENCY.md)에 따라 담당/입력/공개 오류를 병렬 수정하고 동일 모델·CLI·검사에서 새1쌍 실행. 회귀111/111, 기존 후보의 문서4줄 수정 재생93/93은 별도 무과금 증거다.
- [새 실제 결과](orchestration/D089_CODEX_RESULTS.md): Codex공개60/93·독립55/63·393905토큰, Jev90/93·59/63·1094757토큰. 제품 완료0/2이며 실제 수리 투영0B. 기존 docstring 오류 통과 뒤 새 enum 동일성 오류2경로가 남았다.
- 원본35영수증·후보·최종 revision·장부를 별도 감사. 잘못된 감사 가정/첫 실패/표시 형식 불일치를 보존하고 정정했다. 과거52530파일·기능422소스 변경0, 장부13정산/410055입력 증가·pending0. 코드/문서/새 결과는 로컬 새 D089 브랜치 미커밋, commit/push 없음.

R20261014-CODEX-MAC 결과: Mac 실제 비교1쌍 종료, 두 조건 모두 제품 미완료. [전체 결과](orchestration/CODEX_MAC_RESULTS.md). Codex23분1.64초/1,084,007토큰/독립57of63; Jev6분42.41초/300,500토큰/독립0of63. Jev는 부분실행 수리binding 오류로 조기종료했으므로 완료절감률 없음. 초기동일210질문 호출구간만243.81초 대9.26초. 스킬환경 변동 한계 포함. 기존결과 보존, 자동재실행 없음. 아래는 각 당시 기록이다.

R20261014-CODEX-MAC: 사용자가 “이번 Codex 비교는 Mac에서 실행”으로 승인했다. 새 codex-e2e 실행기에만 `--execution-host mac` 예외를 적용한다. Codex 판단→Jev 판단 순차 각1회, 동일 Codex 작업자, 기존 결과 보존, 공유 장부 복원 금지. 실제 결과는 `benchmark-runs/codex-e2e-mac-20261014-01/`에 기록한다. 아래 내용은 각 시점의 기록이다.

## 2026-10-14 — Codex 전체 개발 비교 실행 연결

추가 실검증: 이전 D079 성공 후보의 복사본으로 공개8/8묶음93/93 + 독립63/63 통과. 원본/복사본/검사 소스 불변,9개 컨테이너 정리,모델호출0. [근거](../benchmark-runs/codex-checks-20261014-02/validation-result.json). 검사 연결 검증이며 신규 Codex/Jev 개발 성능으로 집계하지 않는다.

- 사용자 범위를 전체 OpenAPI client generator 개발 비교로 확정. [역할](agents/R20261014_CODEX_E2E.md)에 따라 작업자/검사/리뷰를 병렬 구현했다.
- 신규 [실행기](orchestration/CODEX_E2E.md)는 공통 Codex 작업자·실제 파일 권한·D083 계획/수리·독립 채점 연결. fixture와 실제 무추론 환경 검증을 분리했다. 관련58/58, Docker 의존성7/7·Codex 로그인 확인.
- Jev 확률과 Codex choice-only의 그룹화 혼입, 상위 AGENTS 상속 가능성, grader 비교 누락, uncertainty 전파를 발견·수정했다. 완료 시간에는 독립 채점도 포함한다. 기존 결과42,050개 SHA 일치. 유료 A/B·속도/비용 절감 측정·commit/push는 미실행.

## 2026-10-14 — R20261014-SKILL-ROUTING 스킬 분류·사용 전제 설계

- [설계](skills/POINTSMAN_ROUTING_DESIGN.md) · [기록](decisions/R20261014_SKILL_ROUTING.md). 사용자 요청 두 항목을 대상으로 스킬 진입, 후보 필터, 고정 영어 질문, ID-handler 연결, 공개 검증과 최초 이용 조건을 설계했다.
- 저장소에 pointsman-routing 초안을 추가했다. main MCP 직접 호출은 validator 강제 경로가 아니므로 스킬만으로 자동 운영이 완성되지 않는다는 한계를 명시했다. 기존 prompting의 D075 안내 갱신은 남겼다.
- 공식 스킬 검사기는 기본/앱 Python 모두 yaml 부재로 실행 실패. 기존 Node YAML 파서로 별도 형식·상대 파일 링크를 검사했고 성공했다. 설치 사본 조회를 수행했으며 실호스트 발견·실행·정확도·효율은 미검증이다.
- 런타임·실험·기존 스킬·설치 설정은 바꾸지 않았다. 새 문서/스킬/evidence와 인덱스 변경, /tmp 진단 JSON 두 개를 남겼다. API·장부·Docker·설치·commit/push 없음.

## 2026-10-14 — R20261014-JEV-REFERENCES Jev 활용 프로젝트·평가 도구 조사

- 사용자 요청: pg-jev와 비슷한 더 좋은 벤치마킹 대상 조사. [결과와 일차 출처](research/JEV_REFERENCE_BENCHMARKS_2026-10-14.md) · [조사 기록](decisions/R20261014_JEV_REFERENCES.md).
- 구현 참고는 jev-kit·jev-ultrafast, 분기 탐색은 JevSpawn, 판단 평가 도구는 JevBench·ReflexBench를 우선 후보로 정리했다. pg-jev의 묶음/연결/캐시와 jev-route의 선택값/handler 연결도 비교했다. REFLEX 논문은 저비용 생성 판단 대조군과 외부 평가의 음성 결과를 참고한다.
- 작성자 공개 측정과 로컬 실측을 구분했다. 최신 로컬 STATE는 D081이며 이전 D075 기억을 현행 상태로 쓰지 않았다. 질문별 판단 평가·같은 응답의 코드 정책 비교·고정 worker E2E를 제안했으나 새 설정으로 채택하지 않았다.
- 문서·일부 공개 소스 열람만 수행. clone/설치/키·장부 접근/모델 추론/Docker/기존 실험 재실행/runtime 변경/commit/push 없음. 조사·기록·목록 링크의 로컬 문서 변경만 남는다.

후속 사용자 확인: 구현 참고와 수치 평가 **두 가지 모두**이며 최신 버전을 가져와 확인한다. Git fetch 결과 research가10커밋 뒤였고 원격에는 D082/D083가 이미 있어, 조사 기록의 D082 이름을 R20261014-JEV-REFERENCES로 옮겼다. 원문4파일은 private before 사본으로 보존했고 원격 클라우드 기록은 덮어쓰지 않았다. research0fda933→2b3c9ac, mainbfdaefe→8b2da35(v0.3.2) fast-forward; 현재 checkout은research다. 최신 D083의 입력축소/분할·작업자진단/범위확장·코드범위선택과 외부참고를 연결해 조사문서에 보완했다. 4파일 관련검사31/31,실패/취소/건너뜀0(16943.006291ms). [명령·Git·보존·소스근거](../benchmark-runs/reference-research-sync-20261014-01/verification.json). D083 원격보고2/3성공이나 새두수정0/3발동이므로 효과미측정, 클라우드원시결과의 로컬재감사도미수행이다. 이 후속에서는 코드가 원격커밋으로 갱신됐으며 새정책구현/유료호출/장부/Docker/commit/push는없다.

## 2026-10-12 — D075 강제 전송 검사·복구 병렬 구현과 실제 비교

- [결정](decisions/D075.md) · [결과와 명령](orchestration/D075_RESULTS.md). 전송 gate/복구/입력/보존 runner/측정/단일 스킬 관리자/독립 검토를 분리했다. 보존 CLI 기본v10, prompt v2, 3phase 실제 요청 검사와 근거 기반 복구를 연결했다.
- 첫 live에서 owner controller context가 profile로 복제돼149079B HTTP400이었다. worker0·원candidate포인터누락·수리round오집계를 보존하고 profile전달/준비실패 처리를 수정했다. 첫 후보는 별도감사 후79/93·60/63 채점, 원결과 미수정이다.
- 두 번째 동일출발 실행은5JevPOST·2SonnetCLI →88/93·60/63이다. 남은 무변경 담당에 대해 근거9개 수집 후 owner5질문92629B가 모델한도로 거부됐다. 이미canonical이라 재구성중단; 추가worker0. profiles 자동재구성 미지원도 명시했다.
- 이전 대비 채점까지355366→369093ms, 알려진803431→709276토큰, 공식환산0.7062281→0.6804039USD. 전체추론량·월정액배분unknown. 품질/시간악화이므로 성공절감아님. 공식환산과 원CLI보고액0.7271624USD를 구별했다.
- 전체1270기준 sandbox listen12는 해당3파일24/24 재검사로 해소, live후81관련+독립4/4통과. 기존1380파일 변경/누락0, helper8·독립source17일치, root125핀 drift0. 실제전송5건×3phase 연결을 확인했다.
- root가 첫Opus 지시문에 JSON계약을 누락해 형식실패. 첫응답보존 후 두 번째attention 통과. 두수리+두모니터 알려진793794토큰·공식1.0249025USD. 모니터23490토큰·0.310004USD는 제품수리와 별도다.
- 실패예약2건은 관측한 계정환불+원HTTP+freshcredits 근거로 정산. 누적17359776입력/946정산·한도/pending/blocked null, 실험컨테이너0·추가0. 새private근거와 미커밋 코드/문서 보존, commit/push·PersonalOS·전역설치없음.

## 2026-10-12 — D074 Jev 프롬프팅·사전 검사·실패 루프

- [설계·사용법·명령](orchestration/D074_PROMPTING_AND_FAILURE_LOOP.md) · [결정](decisions/D074.md). 공식 호스팅 규칙과 제조사 프롬프팅 권장을 조사하고 새 저장소 jev-prompting 스킬, 고정 정책과 offline 검사 CLI를 연결했다. Codex/Claude 진입점과 npm script를 갱신했다.
- 고정 검사 범위는 projected repair_owners/inferred-v2다. 기존 client/adapter/v4를 재사용하고 고정 질문·실패/근거/기존 담당·선택지·handler 연결, 모든 공개/로컬 검사의 실행 상태와 집계를 검사한다. 새 로컬 토큰 상한은 없다.
- 최종 관련 회귀63/63·독립17/17. 최초 identity hash 오탐과 이후 테스트61/61에도 빠진 잘못된 입력5개 통과를 기록하고 고쳤다. 초기 출력·소스와 수정 후 보고서를 따로 보존했다.
- 실패 루프는 결과/정산 확인, 입력·환경 복구, 무진전 근거 조사, 남은 실패 Jev 선택, 선택 worker, 전체 공개/독립 검사로 설계했다. 같은 revision의 검사를 반복하지 않고, 동일 근거의 worker 재호출과 profile만 바꾸는 우회를 허용하지 않는 조건을 명시했다. 실제 복구 실행은 아직 없다.
- 정책 참조 기존 소스8개·원본 요청2개 해시 불변. 14/2문항 모두 구조 통과해도 후자의 과거 HTTP400을 성공으로 바꾸지 않았다. 실제 API/worker/Docker·키·장부 접근 없음. 저장소 파일과 private 증거는 미커밋이며 전역 설치·push·Personal OS 변경은 없다.

## 2026-10-12 — D073 기존 담당 추론·무상한 입력·실제 수리

- [결과](orchestration/D073_RESULTS.md)·[결정](decisions/D073.md). inferred-v1/v2, v4비차단추정, provider-limits-v2 profile을 병렬연결했다. 회귀1225/1225와 독립 권한·실행 감사를 확인했다.
- 첫 새개발79/93·60/63과 첫 보존수리67/93·49/63은 ownerHTTP400이었다. 입력v2의 기존후보26담당추론은 성공했으나 chooserHTTP400으로 worker0. 병렬 새후보는 공유장부 미정산으로 전송전중단(POST0/CLI0)했다.
- 정산후 new-02는14실패담당추론→2worker/3artifact→A14/A15쓰기·A10쓰기0→공개91/93·독립61/63이다. round2 ownerHTTP400으로 미완료, 채점까지355,366ms·알려진803,431토큰·공식환산$0.7062281이다. 전체토큰/월청구배분은null이다.
- 5시도 중복제거합계는 Jev65POST·Claude17CLI/알려진3,764,738토큰/$7.8507227. 별도Opus5.5medium 숫자검토1회attention/33,290토큰/$0.31238. 기준선·catalog재사용·root개발작업을 신규 provider합계에 넣지 않았다.
- 입력감사HTTP400누락, 환불helper의UI잔액필수전제, 분석manifest metadata오류를 별도기록했다. 실패/null원본과 보정뷰를 분리했고 chooser압축시안은 오프라인만 검증했다.
- 원본7219/실행376핀 변경0, 동일장부17,190,366입력/938정산·무상한·pending/blockednull, 기존Docker22/실행3개불변. 새스킬설치·commit/push·PersonalOS변경없음. 소스·후보·로그는 미커밋이다.

## 2026-10-12 — D072 입력 검사 CLI·저장 요청 재생·미완료 원인

- [기록](orchestration/D072_INPUT_VALIDATION.md)·[결정](decisions/D072.md). 실제 adapter/v3 admission을 재사용한 offline CLI와 npm 진입점을 추가했다. D071 108요청의 형식/공식바이트108통과, 추정107통과/repair1차단, 과거POST107 HTTP200·목적지, 입력440파일 불변을 확인했다. 차단이 있으므로 정상적인 exit2다.
- 최초 모델명 동등 비교는 호출 전 관측과 현재 응답의 허용 별칭 변화를48건 오류로 오판했다. 최초 JSON/소스 보존 후 별도02감사에서0오류로 수정했다. 집중9/9, 새추론0. 첫 제한환경 GET실패를 보존하고 허용환경에서 모델GET200·jev-latest 가용성을 확인했다.
- Jev 고정은 독립3실패가 남은 품질 문제, 프로필은26공개실패/18담당fallback으로86,809B 수리 입력이 되어전송전차단된 문제다. 정확토큰은미측정, 기존D069추정통과후API거절 반례도 남겼다. 담당/질문/정책 수정·새개발/수리·commit/push는 진행하지 않았다.

## 2026-10-12 — D071 실제 비교·보존 수리·회계·독립 감사 종료

- [최종 결과](orchestration/D071_RESULTS.md)와 [결정](decisions/D071.md)에 실제 세 조건과 별도 보존 수리를 기록했다. Claude만93/93·63/63완료, Jev 고정93/93·60/63·프로필67/93·49/63은 미완료다. 채점 포함39분05.048초/30분52.044초/22분54.804초, 토큰4,589,913/3,648,801/2,874,640, 공식환산$16.6926398/$12.6353014/$6.8848420이다. 실패한 낮은 시간·지출을 성공 절감률로 계산하지 않았다.
- 기존 설명 누락 후보는 Jev1POST→producer A14의 실제 담당 n8→operations.py1파일 수리→93/93·63/63으로 성공했다. 별도 시작점의638,073ms/205,689토큰/$0.6454572이며 원본·비선택산출물은 보존했다.
- 프로필 Jev5POST→Opus4/Sonnet6 medium→실제10/10identity를 확인했다. 새 실패26개 중18개 미지원·미연결 assertion의 fallback이75요구/86,809B/문항추정35,206을 만들었고 수리 전송 전에 차단됐다. 사전58개 preview가 이 다중실패 범위를 증명하지 못한 사실을 남겼다.
- 원시 profile callback64 중 로컬1개의 usage/costnull은 보존했다. 별도 보조집계와 독립감사에서 POST53+CLI10만 실제 호출 범위로 집계했다. Sonnet cache-read452,438 ×단가차$0.10/MTok=$0.0452438 차이로 CLI보고 환산6.9300858과 공식6.884842를 구분했다.
- source269/prelaunch300·과거14,576파일 drift0와 네 후보-grade hash/revision binding을 감사했다. 장부107POST/입력1,550,787 증가 일치, ID/이력/무상한 유지, pending/blockednull. 기존 Docker22/실행3개 불변이다. 실행기·채점·모니터는 종료됐다.
- 숫자전용 Opus모니터1회는attention/32.720초/32,425토큰/$0.29742다. 추가 회계보정을 권고에 반영하지 않은 부분은 원시근거로 정정했고 재호출하지 않았다. probe4+모니터+보존수리+세조건 총11,353,865토큰/환산$37.1750816, 실제 월청구 배분null이다.
- 단일 스킬 담당이 reference두문장과 유지보수·역할 기록을 갱신했다. 신규스킬/설치/추가유료실험/commit/push/PersonalOS변경없다. 기존 HTML은D070 snapshot이며 D071결과로 갱신하지 않았다. 아래 시작 기록은 당시 상태로 보존한다.

## 2026-10-12 — D071 실제 병렬 실행 시작

`benchmark-runs/d071-preflight/launch-gate.json`에서 source269pins, 기존14,576파일 불변, 전체1190/1190·독립91/91, 최종profile58/58입력/metadata 재생을 확인했다. Root driver75186으로 세 개발 조건과 보존 후보 수리를 새 경로에서 병렬 실행했다. 각 후보 종료 뒤 독립63채점을 자동 연결하며 terminal까지 소스를 변경하지 않는다. Root 테스트 요약기가 spec reporter를 놓친 결함은 원본을 보존하고 summary02로 정정했다. 실제 완료·비용·효율 결과는 아직 미확정이다.

## 2026-10-12 — D071 병렬 구현·검사·계정 확인

추가 description 실패의 producer/IR/renderer 담당 연결, immutable read overlay, 반복 수리 이력, Jev 모델/effort 선택을 병렬 통합하고 있다. 정상8/결함83 Docker controls 통과, 원문14,576파일 보존, 실제4모델 low-effort identity 확인. 계정 probe 비용 $0.0194212는 별도 API 환산이며 실제 월정액 배분은 null. 새 세 조건 개발과 보존 후보 수리 결과는 아직 미측정이다. [D071](decisions/D071.md)과 [실험 계약](orchestration/D071_EXPERIMENT.md)을 따른다.

# Jev Router 작업 기록

## 2026-10-11 — 현재 DAG·Jev 요청을 인터랙티브 HTML로 설명

- [가이드](visualizations/jev-dag-explorer/index.html)·[사용법과 검증](visualizations/jev-dag-explorer/README.md)·[빌더](../scripts/build-dag-explorer.mjs)를 추가했다. 현재 D070의 질문 문서, 허용 후보, `choice` 적용, 재귀 트리, 실제 파일 의존 DAG, 병렬 dispatch, 공개 실패 수리를 연결한다. 런타임·실험 변경과 새 추론 호출은 없다.
- 요청/응답/이벤트/영수증을 묶어 실제 POST50개(분할13·배정33·관계2·수리2)와 로컬18개를 구분했다. 트리17노드→구현10+검증1, 구현 간선8개이며 관계45문항은32+13으로 전송됐다. 267출처 해시·기존242 launch source 해시 drift0, 내장 JavaScript 문법을 확인했다.
- 브라우저에서 노드·필터·원문·재생·근거창을 직접 조작했다. 무관한 노드를 통과해 보이던 관계선, 필터 변경 뒤 남던 이전 상세, 흐린 노드 글자를 발견해 수정했다. 기존148gate 통과/추가0/8 실패와 수리 후보 누락·임계 경로 미구현 한계를 표시했다.
- 서버는 결과물 폴더만 `127.0.0.1:56751`에서 제공한다. 브라우저 API 호출 없음·새 파일 미커밋, 기존8787 통합/배포/commit/push는 없다. 모바일·OS 클립보드·JSON 다운로드·파일 직접 열기는 미검증이며 [검증 기록](visualizations/jev-dag-explorer/verification.json)에 구분했다.

## 2026-10-11 — D070 실제 비교·보존 수리·추가 품질 진단 종료

- [최종 결과](orchestration/D070_RESULTS.md)·[독립 감사](../benchmark-runs/d070-review/postrun-review-01.json). A 고정공개85/85·독립63/63,2,064,734.652875ms/4,267,230토큰/환산$12.1814126. 기존 Claude 대비 시간5.31796%·토큰36.99335%·비용42.36426% 감소, 각1회·동시성차이 한계를 기록했다.
- 신규 최대leaf는12→3unit, 같은10leaf다. 실제Jev50POST·Claude12CLI. 같은 템플릿 범위의3worker→1worker 묶음은 토큰65.354%·비용6.920% 증가한 반증을 남겼다. A 검증444.990초/B368.609초, A초기lock37.754초도 분리했다.
- [추가 공개 진단](orchestration/D070_QUALITY_REVIEW.md)은 A0/8·Claude/D069각8/8. 동일한 두 description 때문에 원래 fixture가 출처 혼동을 놓쳤고, Jev 후보는A19/중단뿐이라 upstream을 선택할 수 없었다. 고정gate 성공을 동일품질 목표 달성으로 확대하지 않는다. 원래148개 점수는 보존했다.
- B는84/85 실패재현→Jev1POST/Claude1수리→85/85·63/63. cli.py1파일만수정,37파일·비선택21artifactrevision불변,비선택9worker재호출0. 533,346.788666ms/125,964토큰/$0.2762162는 전체개발과 별도 수리 범위다.
- 별도Opus모니터identity확인·attention·37.244초/17,278토큰/$0.182832. 신규 A+B+monitor 총4,410,472토큰/$12.6404608환산, 실제월구독배분null. packet생략은root원본분석으로보충했고재호출없다.
- 회귀1126/1126·source242pins·기존5841파일/329snapshot drift0. 장부14,653,024입력/766정산,증가750,338/51회영수증일치,pending/blockednull. 컨테이너기존22개/실행3개불변. 모든실행종료·로컬미커밋·신규commit/push/설치/PersonalOS변경없음. 설명producer 기반수리·공개경계검사·작업량분해·lock/검증축소는남겼다.

## 2026-10-11 — D070 원인 분석·병렬 구현·실제 실행 시작

- [프로토콜](orchestration/D070_EXPERIMENT.md)·[구현](orchestration/D070_IMPLEMENTATION.md)·[역할](agents/D070_PARALLEL.md)을 기록했다. 분해·수리·측정·독립리뷰·단일스킬 담당이 분업했다. n9의12unit·50요구 집중은 불균형 배정과 depth3 로컬 종료가 함께 만든 결과다.
- balanced-v2의 부담 상한·균형 membership·깊이 추가 분해와 보존 후보의 실제 선택 산출물 수리를 연결했다. 처음 원자21leaf 입력의 질문별추정32,116 초과를 발견해 원문을 보존하는 중복제거로 최대26,958까지 낮췄다. 최초 진단은 보존했다.
- 최종회귀1126/1126·독립리뷰18/18·모의모든요청116개 한도검사, source242pins·과거5841파일 보존을 확인했다. driver45343으로 새A와B를 동시에 시작했으며 각종료후독립채점을자동실행한다. 실제완료/효율은아직미측정이다.


## 2026-10-11 — D069 새 전체 실행·독립 채점·분석 종료

- [결과](orchestration/D069_RESULTS.md), [구현](orchestration/D069_IMPLEMENTATION.md), [분석02](../benchmark-runs/d069-analysis-02.json). assertion4개 담당 연결·artifact 수리 scope·v2입력검사를 병렬 통합했다. 최종회귀1108/1108·공개controls7묶음/결함81개, 원시 소스247/과거4482변경0을 확인했다.
- fresh Jev47POST+Claude10구현, 공개85/85·독립63/63으로완료. arm2364670.661541ms, 캐시포함5809782토큰/$12.3604662환산. 실제수리/재호출절감은0회/미측정이다. Claude기준선보다시간8.4361%증가,토큰14.2172%/비용41.5171%감소;각조건1회·동시성차이를보존한다.
- v1진단70510B가추정통과후실제입력한도거절. 새v2는23715B로감소(분모97071B대비75.5694%)하고진단03에서수락됐으나worker0이다. 초기timeout오류POST0·고정성공문구오류·환불/usage미상·sandboxEPERM실패를원본과함께기록했다.
- 별도Opus모니터31.291초/8674토큰/$0.106932·attention. 질문범위와요청전체토큰의오차비율주장을기각해root정정에보존했고자동추가실험은없다. 종료Docker첫수집절단도보존하고직접파일02로22개/실행3개불변확인.
- 장부13902686입력/715정산/pending·blockednull,기존ID/무상한유지. 원본·후보·소스·로그미커밋보존,실험컨테이너제거,commit/push/전역설치/PersonalOS변경없다. 실제artifact수리·반복효율·미지원assertion·정확tokenizer는남은검증이다.

## 2026-10-11 — D069 병렬 수정과 재실행 사전 검증

- [계약](orchestration/D069_EXPERIMENT.md)·[역할](agents/D069_PARALLEL.md)·[결정](decisions/D069.md)을 먼저 기록했다. assertion 담당/산출물 수리/토큰 admission/독립 리뷰/단일 스킬 관리로 분업하고 root가 runner·planner·v4 manifest를 연결했다.
- 지원4개 assertion은 현재 계약원문/hash·runtime·revision이 맞을 때만 담당 산출물을 좁힌다. 미지원·stale은 task 범위 fallback이다. 쓰기 허용 밖 자체 산출물은 바이트·권한을 상속하고 모두 재검사한다. public-interface 담당은 실제 원인 파일 확정 증거가 아니다.
- `npm test` 1099/1099·skip0(34,504.409625ms), 새 정상control7묶음·결함81개(110.735657s), 실제 GET/OAuth/고정Docker preflight ready·추론0. D06848요청의 토큰정책 재생은 성공47통과/과거실패1차단이나 exact count·새수락보장은 아니다.
- 기존 후보를 새 runtime에 그대로 복사해 실제 공개재검사와 assertion packet을 만드는 중이다. 다음은 별도 작은 질문1회 실제수락 진단 및 새Jeval l 조건이다. 현재 새 모델결과·완료·절감은 미측정이다.

## 2026-10-11 — D068 세 병렬 수정·실제 Jev 전체 재실행 종료

- 요청에 따라 입력 투영/실패 전파/수리 범위를 역할별 병렬 수정했다. [구현](orchestration/D068_IMPLEMENTATION.md), [결정](decisions/D068.md), [실측](orchestration/D068_RESULTS.md). 사전 전체1072/1072, 소스31pin과 과거 결과 보존 후 새 한 조건만 실행했다.
- 공개84/85·독립63/63, 전체미완료. Claude10구현과 Jev48POST(분해45·관계2·실패수리1), 실제수리worker0. 투영172019→97071B였으나HTTP400 model_input_limit가남았다. terminal_cause와앞선공개실패·정산을분리하는수정은실제경로에서확인했다.
- 실행기1843397.350542ms/관측4350647토큰/$10.5692038환산. 실패usage미상으로전체합null. 과거Jev전체보다실패시도181221.819999ms짧고관측토큰1023347늘었다. 과거4조건동시와새단독·실패차이때문에완료효율개선주장없음.
- 실패통합case는9요구사항으로owner3/consumer포함4명후보를만들었다. 전원10명후보없으나n9의12unit/50요구사항이큰명세를남겼다. case내부미도달검사표현부족을기록했다. [범위분석](../benchmark-runs/d068-scope-live-failure-01.json), [입력분석](../benchmark-runs/d068-projection-live-failure-01.json).
- 별도Opus5.5medium수치모니터21.209초/$0.083824·failed. r666환불증거대조후장부정산완료(누적12994396입력/666정산/pending0), 원본pending은보존. 실패청구0과추론토큰미상은별도다.
- 이전검증실패14건(권한12·실제장부의존mock2), 새정적진단AugAssign오류, cohort실패exit오류와후처리null/분석해시결함을숨기지않고수정기록했다. 후보38파일보존·독립skip0, 기존컨테이너22/실행3유지. 미커밋코드·문서·private증거를남기며추가자동실행·push·전역설치·PersonalOS변경없음.

## 2026-10-11 — D067 실제 병렬 실행·채점·환불·분석 종료

- [실측 결과](orchestration/D067_RESULTS.md), [분석02](../benchmark-runs/d067-analysis-02.json). 네 fresh arm을 병렬 실행했고 driver exit2로 종료했다. Claude36분20.704초/$21.135172, Jev분해25분54.036초/$9.864863, Jev분해·관계28분24.540초/$8.766580은 공개85/85·독립63/63 통과다. Jev전체33분44.619초시도는공개83/85·독립63/63이며수리POSTHTTP400입력한도실패로전체완료아니다.
- 새227호출=ClaudeCLI92+JevPOST135, Jev성공134·실패1. 전체확인환산소계$50.6784966,별도Opus5.5medium모니터1회30.862초/$0.120288·attention. 실제월청구배분과실패추론사용량은null이다. 준비catalog는재사용해새준비지출0. 조건당1회, 동일선택형문법Claude기준선, 모델/환경/캐시/배정차이를한계로기록한다.
- Jev수리요청은직렬화188240B<local240000B이지만모델context제한으로거절됐다. 전체실패기록이state를팽창시켰다. 하위확정HTTP실패를상위uncertain으로올리는어댑터와이전공개실패를최종code로내보내는결함을원본보존하에확인했다. Claude기준선은정규식실패로59검사미실행,수리후보가미실행항목까지소유자에연결해7/7worker를재호출했다. 실제변경산출물4/22다.
- 인증UI실패/환불행과인접성공행·freshcreditsGET·저장HTTP400을대조한뒤r618만기존함수로정산했다. 기존ID유지,입력9,584,555→12,096,997,정산483→618,pending0. 자동POSTretry/실패조건재개0. 실행원본uncertain은성공으로수정하지않았다.
- 독립채점4개모두63/63,skip0,후보전후동일,컨테이너제거. 원시감사는선택→DAG→허용파일→실행→공개revision과비용을대조했다. 대시보드v3projection53/53은8787전체adaptive화면연결검증과다르다. 스킬담당은기존기록계약에요청바이트/모델토큰,실패/정산상태,공개+독립완료규칙을추가했다.
- 종료컨테이너검사첫버전은전체ID와축약ID를비교해모두신규로오분류했다. 원본을보존하고--no-trunc로다시대조한02에서시작/종료22개동일·새잔류0·실행3개유지확인. 생성후보·로그·임시설정·미커밋소스문서보존. PersonalOS/Vault·Gitcommit/push·전역설치없음.

## 2026-10-11 — D067 상한 해제와 병렬 실행 준비

- 사용자가 조건별 상한과 누적 장부 토큰 제한을 해제하고 병렬 실행을 승인했다. [프로토콜](orchestration/D067_EXPERIMENT.md), [역할](agents/D067_PARALLEL.md)을 먼저 기록하고 budget/runner/독립 검토/단일 스킬 담당이 분업했다. root는 통합 검사·실제 장부 이관·유료 실행을 담당한다.
- 실제 이관 전 장부 사본에서 ID·사용량9,584,555·정산483·pendingnull을 보존했다. 새로운 빈 장부나 사용량 초기화는 하지 않았다. 이 사전 기록 시점의 D067 모델 호출은0이다.
- 무상한 v3와 병렬 대기 경로를 구현하며 null이0으로 강제 변환되는 preflight, 정상 진행 중 pending의 오차단, 다른 조건의 장부 문제로 완료 결과가 바뀌는 종료 기록 경계를 함께 검토했다. 새 생산 경로의 실제 제품 결과는 아직 미측정이다.
- 스킬은 기존 reference에 한도 정책·준비 재사용·병렬 workflow와 직렬 정산 경계를 보완했다. 대시보드 projection도 v3의 제한 없음과 사용량 미확인을 구분하며 focused53/53을 통과했다. 이는 새 adaptive 실행의8787전체연결 또는 브라우저검증 완료가 아니다.

## 2026-10-11 — D066 실제 종료·실패 원인·독립 채점

- [최종 결과](orchestration/D066_RESULTS.md), [결정 기록](decisions/D066.md). 공통 준비 21단위·22산출물·38파일·80요구사항을 공유한 4조건 시도가 종료됐다. Claude는 공개84/85→85/85, 독립63/63·skip0으로 완료됐다. 공통 준비 전액 포함42분54.750초/API환산$22.148223이다. Jev3조건은 각각33POST/650,271입력 뒤 다음 예약65,536이 조건별700,000을 넘어 분해 중단됐다. 관계·수리·제품 완료 속도 비교는 미측정이다.
- 독립 구조 감사에서 Jev 각33요청의 바이트·33선택·44결정·미완성 트리가 세 조건에서 일치했다. 유료 소속31개 모두child_1,18/1/1/1→15/1/1/1로 집중됐다. 33개 요청1,781,829바이트 중 요구사항·단위/인터페이스·인용·산출물 값1,719,252바이트(96.49%)가 두 projection으로 반복됐다. 바이트 분석을 토큰 절감 실측으로 바꾸지 않았다.
- 원시 receipt별 비용과 source/후보/검사 binding을 별도 담당이 감사했다. 실제 cohort153호출(Claude54/Jev99), 공유 준비1회 포함API환산$23.3187108. 실제 Opus5.5 수치 모니터1회/27.650초/$0.069496은 별도이며 합계$23.3882068, 실제 월 청구는null이다. 최초 메타데이터 패킷은 자동 승인 검토에서 전송 거절됐고 식별자·경로 없는 수치 패킷은 별도 승인 뒤 실행됐다.
- 첫 분석의 Jev 시작 이벤트 경계 오류를 v2에서 정정했다. 호출 어댑터 시간은 모델 조회·예약 등을 포함하므로 순수POST지연으로 쓰지 않는다. v1과 원본 요청/응답/후보는 보존했다. 공개 최초검사2,174assertions/84pass·1fail,수리후2,228assertions/85pass; 독립제품63pass와 별개다.
- 기존 장부9,584,555/10M·잔여415,445·pending/reserved0, 같은ID/이력 유지. terminal cohort/grade/monitor 프로세스 종료, D066컨테이너 없음, 기존컨테이너 보존. 원본PersonalOS/Vault·전역설치·Git커밋/푸시 변경없음. 단일스킬담당이 기존 reference/목록에 실제전송계수·예약한도·시간경계·리뷰입력범위를 보완했다. 소스·문서·실험로그·후보는 미커밋이다.
- 최종 오프라인 검사는 분석 입력 해시 285개·source pin/사본 566개·문서 7개/로컬 링크 64개에서 실패 0이었다. 기록 검사 sources 19/claims 17, `git diff --check`도 통과했다. [종료 검증](../benchmark-runs/d066-preflight/closeout-validation.json), [독립 원시 근거 감사](../benchmark-runs/d066-review/final-independent-audit-01.md). 모델 호출·후보 재실행 없이 종료 상태를 확인했다.

## 2026-10-11 — D066 4조건 비교 연결

- 최신 사용자가 기존 `openapi_python_client` 과제로 재귀 분해·관계 판단·자동 수리·Claude 대비 효율의 실제 비교를 요청했다. D065를 보존하고 [새 프로토콜](orchestration/D066_EXPERIMENT.md)과 역할 문서를 먼저 작성했다.
- 기존 6개 역할 담당이 새 planner/execution/runner와 평가·독립 검토·스킬 기록을 병렬 진행했다. 스킬 원본 추가 없이 기존 2개 스킬을 적용했다. 실제 호출은 root만 실행한다.
- 공개 원문으로 준비한 새 후보 목록, 같은 영어 질문·작업자·검사 조건에서 4조건을 비교한다. 후보 준비 전액 포함과 cohort 실제 1회 비용을 구분한다. 수리 기회는 각 최대 2회다.
- 추론 없는 실제 조회에서 CLI 로그인·고정 이미지·Jev 모델 목록과 기존 장부를 확인했다. 입력 사용7,633,742/10M, 잔여2,366,258, pending0이었다. 근거: `benchmark-runs/d066-preflight/initial-readonly.json`.
- 준비 중 catalog와 실제 파일 도구의 경로 규칙 불일치, 체크 argv의 줄바꿈 제약을 확인하고 유료 실행 전에 수정했다. 기존 실패·원본 소스는 보존한다. 최종 회귀와 live 결과는 이어서 기록한다.

## 2026-10-09 — D-019 paired 개발과 별도 Opus 모니터

- 사용자 호출 횟수 무제한/두 호출 연결/별도 Opus 모니터 지시를 확정 기록했다. 역할 문서 후 분업했다.
- nullable 무제한, 실행/시도/그룹/판단 ID, 독립 gate 상태, 조기 preflight 기록, heartbeat와 종료/freeze 보완.
- SSE snapshot/GET fallback, 실패/중단/역할/같은 그룹 UI와 모니터 해석 표시.
- 별도 Claude custom agent --agent benchmark-monitor/정확한 Opus5.5, no tools, 상태변화 기반 관측.
- 새모니터검토4결함수정: 취소뒤추가호출/임시불확실종료/충돌한최종응답/종료기록실패후성공잔류.
- npm test244/244, 최종일부변경focused58/58, 합성Chrome8/8; 모델성능검증아님.
- 호스트OAuth인증과Jev고정GET/jev-latest확인. 컨테이너 준비 후 paid명령은 자동승인심사에서 차단.
  이유는 호출횟수해제와별개로 무제한 Jev 금액지출승인 부족. 잔액사용질문 대기. 모델추론은 시작하지 않았다.
- 미사용컨테이너 제거, 새localhost8787서버/session17672 유지 및현재탭재로드확인. 기존Personal OS/Vault변경없음.
- [실행안내](PAIRED_RUN.md), [검증](../VERIFICATION.md), [현재상태](agents/STATE.md)에 재현과미완료범위기록.


## 2026-10-09 — 실시간 연동·진행 실패 관측 조사

- D-018 사용자 요청으로 전송·화면, 기존 관측 도구, 현재 실패 공백 감사를 역할 문서 기반으로 분업했다.
  main은 Claude/Codex/MCP/Docker 계측 경로와 통합 제안, 공유 문서·읽기 전용 상태 확인을 맡았다.
- polling/long polling/SSE/WebSocket, Phoenix/Langfuse/LangSmith/OTel+Grafana/Temporal/Prefect를 공식 자료로 비교했다.
  로컬 원장과 실패 의미를 먼저 보강하고 전체 snapshot SSE+GET fallback을 연결하는 안을 제시했다.
  source heartbeat, 작업 진전, 화면 연결, 독립 평가를 별도로 표시한다. 이는 미구현 제안이다.
- 현재 stream의 HTTP 요청 수 미확인과 CLI 자체의 관측 능력을 구분했다. Claude native OTel 요청 오류·attempt,
  Codex exec JSONL/App Server event가 추가 경로다. runner의 OTel 전달과 현재 Desktop 대화 구독은 미연결이다.
- 실제 localhost GET: 14:40:29 KST HTTP200, control7/live0. evaluation failed2는 기존 빈 제출 대조이며
  현재 모델 실행 장애로 해석하지 않는다. `codex exec --help`/version은0.144.1/JSONL 지원을 확인했다.
  PATH alias permission 경고는 있었지만 두 명령 exit0. 모델 실행이나 auth 조회는 하지 않았다.
- 기존 코드 감사에서 도구 실패/중단 이유 누락, runner 최종화·grader 연결의 공백을 추가 확인했다.
  기존167 테스트가 이런 진행 실패 탐지를 충분히 검증했다는 해석을 철회하고 실제 실험 전 P0 보완을 명시했다.
- 새 감사 명령 `node /private/tmp/jev-realtime-audit.CRhMrJ/audit.mjs`에서20개 장애·경계의 현재 동작을
  확인했다. 결함이 재현된 assertion도 포함하므로20개 제품 요구사항 통과로 표현하지 않는다.
  결과JSON·소스SHA는 같은 임시 폴더에 있고, 감사 문서에20행 matrix와 실제 소스 근거를 남겼다.
- 통합 결과: [실시간 실패 조사](REALTIME_FAILURE_RESEARCH.md). 세부 공식 근거·접근 실패·재현은
  하위 조사 문서에 보존한다. 사용자의 연동 우선 대상 질문은 답변 대기다.
- 제품 소스·실행 중8787 서버·기존 기록·컨테이너·인증·전역 설정은 변경하지 않았다.
  조사/역할/결정/명세 문서만 변경하며 설치·새 추론·외부 trace 전송·commit/push 없음.

## 2026-10-09 — 사용량 대시보드와 실행 중 계측

- D-017 사용자 요청으로 research/metrics/UI/review 역할 문서를 먼저 썼고 담당 서브에이전트를
  배정했다. main은 reader/server와 실행기 계측, 전체 검사와 실제 Chrome 검증을 맡았다.
- 공식 문서 조사에서 Claude USD가 가격표 기반 추정액이고 Jev 원시 토큰/잔액 토큰/credits가
  다른 단위임을 확인했다. [조사](DASHBOARD_RESEARCH.md)에 출처와 실제 청구 미검증 경계를 남겼다.
- Jev POST 경계의 내구 이벤트, Claude JSONL 스트림 저장, 허용 필드만 반환하는 서버와
  검색/종류 필터/3초 갱신/호출/토큰/비용/평가/타임라인 화면을 구현했다.
- 독립 검토 P2 4건을 수정했다. 실패 usage 보존(0 modelUsage 충돌 포함), stale run 상태,
  cleanup 실패 상태, UTF-8 마지막 미완성 줄 처리다. [검토 기록](agents/dashboard-review-STATUS.md).
- 검증 실패도 보존한다. 첫 HTTP 검사는 sandbox listen EPERM으로 실패한 뒤 허용된 localhost에서
  통과했다. 새 deadline reader 테스트는 manifest를 잘못 중첩해39/40이었고 실제 스키마로 고쳐40/40이었다.
  Playwright wrapper 직접 실행은 권한 오류였고 npx offline은 패키지가 캐시에 없어 실패했다.
  설치된 Playwright 라이브러리와 Chrome 임시 프로필로 전환해 실제 브라우저 검사를 마쳤다.
- 최종 `npm test`:167/167, focused49/49, 브라우저10/10. 명령·출력·한계는 [검증](../VERIFICATION.md).
  스크린샷/브라우저 보고서는 `output/playwright/`에 있다. 실제 모델 추론은 하지 않았다.
- 기록 루트에서 무모델 대조7건을 확인했다. 기본 서버는 localhost8787에 남기고 합성 서버/Chrome은 종료했다.
  첫 유료 실험 한도 답변 대기와 실제 모델 스트림/청구 검증은 별개 미완료 항목이다.
- 기존 Personal OS/Vault, 자격 증명, 전역 패키지는 변경하지 않았다. commit/push 없음.


## 2026-10-08 — D-016 OAuth 확인과 중복 CLI 제거

- 사용자 로그인 완료 후 앱 관리 CLI를 호스트에서 조회해 loggedIn=true/authMethod=claude.ai 확인.
- `npm ls -g --depth=0 @anthropic-ai/claude-code`로 2.1.280의 소유자가 npm임을 확인했다.
  `npm uninstall --global --prefix /opt/homebrew --ignore-scripts --offline --no-audit --no-fund @anthropic-ai/claude-code`
  는 removed2packages/exit0. 제거 후 대상 디렉터리 부재와 npm ls의 `(empty)`/exit1을 확인했다.
- `/opt/homebrew/bin/claude`는 기존 경로 부재를 확인한 뒤 앱 관리 2.1.293 바이너리로 symlink했다.
  직접 `claude --version`과 auth 재조회 모두 exit0, loggedIn=true. Jev runner의 명령도 같은 경로로 연결된다.
- 토큰/계정 상세 출력·앱/로그인 저장소 삭제·Personal OS 변경·모델 추론·컨테이너 생성은 없다.
  부수 효과는 npm 전역 중복 설치 제거, 명령 링크 대상 변경, 프로젝트/실험 상태 문서 갱신이다.
  명령과 업데이트 시 경로 한계는 [CLI 확인 기록](CLAUDE_CLI_DISCOVERY.md)에 남겼다. commit/push 없음.

## 2026-10-08 — Desktop 관리 Claude CLI 직접 확인

- 사용자가 앱 관리 CLI를 확인하라고 요청했다. 기존 PATH CLI만 확인했던 범위를 확장했다.
- `~/Library/Application Support/Claude/claude-code/2.1.293/8433d0d9cd0d/claude.app/Contents/MacOS/claude`
  를 발견하고 `--version`2.1.293, `auth login --help`를 실제 실행했다.
- 같은 바이너리의 auth 조회는 샌드박스와 허용된 호스트 모두 loggedIn=false였다.
  앱 UI 로그인까지 실패한 것으로 확대하지 않는다. 프로세스 조회는 샌드박스 제한으로 실패했다.
- 기존 `/opt/homebrew/bin/claude`는 전역 npm 경로로 연결된다. 디렉터리 이름만 보고 Homebrew
  설치로 표현한 내용을 정정했다. 명령과 한계는 [CLI 확인 기록](CLAUDE_CLI_DISCOVERY.md)에 있다.
- 실행기 전환·로그인·추론·앱 설정/기존 Personal OS 변경은 없다. 조사 문서만 미커밋 변경했다.

## 2026-10-08 — D-015 Personal OS 새 디렉터리 준비

- 사용자 지시를 반영해 `../personal-os-jev-lab/`를 새로 생성했다. 영어 goal/format/합성 입력만
  기존 packet manifest의 allowlist로 복사하고 각 SHA-256을 대조했다. 구현 workspace 두 곳은 비워 두었다.
- 준비 명령은 Node 표준 fs/crypto의 manifest 기반 복사·해시 대조였다. 검증 파일15개,
  status=prepared_not_executed/model_calls=0. 영수증은 새 루트의 `control/preparation-receipt.json`이다.
- `claude auth status --json`은 exit1/loggedIn=false/authMethod=none이었다. 유료 실행 표현과 한도
  확인 질문은 별도로 유지하며, 불명확한 문구를 특정 예산 선택으로 바꾸지 않았다.
- 기존 앱·Vault·서비스 변경, 실제 모델 실행, 컨테이너 생성, Git 초기화/commit/push는 없었다.
  부수 효과는 새 실험 디렉터리·합성 입력 복사·운영 문서와 Jev Router의 미커밋 기록 갱신이다.

## 2026-10-08 — D-014 두 벤치마크 준비와 실제 무과금 검증

- 사용자가 공개 과제 클론과 Personal OS 병행 진행을 요청했고 Docker 시작을 알렸다.
  실제 `docker info --format '{{json .ServerVersion}}'`은29.6.1. Claude 인증은 허용된 호스트
  재조회에서도 loggedIn=false였다. 인증 방식/최초 유료 한도 질문을 올리고 독립 준비를 계속했다.
- 역할을 먼저 문서화한 뒤 bootstrap/personal-os-benchmark/decision-gate/review를 생성했다.
  main은 host Claude/MCP/Docker transport, launch, 실제 채점 실행과 통합 검증을 담당했다.
- 공식 E2E-SWE와 평가자용 pytest-check 정답 저장소를 클론·고정했다. upstream/이미지 SHA는
  manifest와 receipts에 보존한다. 모델에는 원본 specification만 제공하며 해법·test를 노출하지 않는다.
- Harbor 설치·blind patch 대신 원본 이미지/tests를 사용하는 독립 Docker 어댑터를 구현했다.
  공식 leaderboard 재현이라고 주장하지 않는다. 최초 이미지 lock은 출력 부모 미생성으로 실패했고
  benchmark-runs 생성 후 성공했다. 이 실패에서 컨테이너/모델은 실행되지 않았다.
- 최초 및 출력 제한 보완 후 새 verifier로 정답/빈 제출 대조를 실행했다. 최신
  `benchmark-runs/grade-oracle-v2/result.json`은30/30/reward1,
  `grade-noop-v2/result.json`은 module missing 수집0/reward0이다. 30개 assertion 실패가 아니다.
- 실제 MCP→선택된 command→Docker→journal 연결을 E2E/Personal OS 컨테이너에서 무과금 검증했다.
  선택하지 않은 명령과 hidden tests가 없음을 확인했다. 새 Node 이미지도 digest로 고정했다.
- 초기 실행기/평가기에서 독립 리뷰가 발견한 4문제를 수정했다: 자식 프로세스 deadline 누수,
  verifier/무제한 자원 container 허용, 정상 종료 뒤 background 작업 잔류, evaluator 출력 무제한 RAM 수집.
  재현/재검증은 [독립 검토](agents/benchmark-runner-review-STATUS.md)에 보존한다.
- `npm test`118/118, E2E Python unittest16/16, Personal OS selftest10/10을 main이 실행해 통과했다.
  실제 command와 receipt는 [실행 안내](../benchmarks/README.md)에 있다. 합성/정답 대조를 Opus/Jev 효과로 해석하지 않는다.
- Personal OS agent packet과 별도 evaluator를 작성하고, 빈/no-op 제출 CLI가 둘 다 exit1/fail,
  full_product_verified=false인 것을 별도로 확인했다. 실제 앱/브라우저/native 실행은 없다.
- 모든 전용 smoke/verifier 컨테이너를 정확한 ID로 제거했고 benchmark label 조회는 빈 결과였다.
  다운로드 이미지2개, 공개 clone2개, 무시된 local receipts, 임시 synthetic 데이터와 미커밋 코드/문서는 남았다.
  글로벌 패키지/Claude 설정·기존 Personal OS·Vault·서비스 변경, 유료 호출, commit/push는 없다.
- 최종 문서 동기화 패치에서 같은 파일의 삭제/추가를 한 patch에 넣어 적용 도구가 거절했다.
  코드/검증 결과는 영향 없었고, 해당 문서를 별도 갱신한 뒤 문서 검증을 수행했다.
- 최종 문서/정적 검사: `node /private/tmp/jev-router-handoff.bTYebC/check-benchmark-docs.mjs`.
  파일95개, Markdown52개, 로컬 링크128건을 검사해 issues=[]/exit0. Markdown fence·로컬 링크·
  Git 공백, JSON 파싱, MJS 문법 검사이며 실제 모델 실행 증거는 아니다.

## 2026-10-08 — 목표·명세 기반 실제 구현 실험 조사

- 최신 사용자 요청을 D-013으로 기록했다. 두 역할 문서를 먼저 작성하고 benchmark 조사와
  Personal OS 명세 검토 에이전트를 생성했다. main은 Claude/Jev 제어와 로컬 준비 상태를 확인했다.
- [통합 조사](LIVE_EXPERIMENT_FEASIBILITY.md)에 기존 방법·역할·자동 판단과 행동 gate·평가 지표·
  준비 상태·남은 구현을 기록했다. E2E-SWE가 실제 목표/명세+빈 공간 과제를 제공하므로
  '기존 방법이 없으면 Personal OS 재구현' 조건이 충족됐다고 해석하지 않았다.
- E2E-SWE 공식 소스의 verifier 업로드 문제를 발견했다. 우리 실행에서 재현한 결함은 아니며,
  실제 모델 비교 전에 정상/빈 제출의 채점 대조 검증이 필요하다. 공식 예시는 mini-swe-agent다.
- Opus 5.5 공식 ID와 강제 tool_choice 비지원, Claude hook과 Inspect host-side 도구 확장점을 확인했다.
  문서상 가능성을 실제 우리 조합의 성공으로 승격하지 않았다.
- Personal OS는 원문 제품 명세·인벤토리만 읽었다. 최신 인벤토리의 정상 native 복원/신규 Vault
  확인 범위를 보존하고, 오래된 미완료 문구를 현재 사실로 재사용하지 않았다. 현재 앱 테스트는 하지 않았다.
- `claude --version`은 2.1.280, 인증 JSON의 비밀 없는 필드만 출력해 현재 환경 loggedIn=false를 확인했다.
  `npm run --silent models`는 제한 네트워크에서 실패했지만, 접근 허용 후 GET 재조회는 HTTP 200/exit 0.
  Docker 소켓 권한 오류 후 읽기 허용 재조회에서도 daemon 연결 실패를 확인했다. 환경을 시작하지 않았다.
- 부수 효과는 이 저장소의 로컬 미커밋 문서와 기존 OS 임시 handoff 체크포인트 갱신이다.
  런타임 코드 수정·설치·컨테이너 생성·유료 모델 호출·실제 앱 변경·commit/push는 하지 않았다.
- 문서 검증: 저장소 루트에서
  `node /private/tmp/jev-router-handoff.bTYebC/check-live-docs.mjs`를 실행했다.
  변경 Markdown 12개, 로컬 링크 56건의 존재, fence 짝·EOF 줄바꿈·Git 공백 검사를 수행해
  오류 0건/exit 0을 확인했다. 외부 링크의 전체 가용성이나 실제 실험 실행을 검증한 것은 아니다.
  임시 검증 스크립트와 인계 문서를 같은 OS 임시 폴더에 남겼다.

## 2026-10-07 — 초기 API 연결

- 사용자가 Jev AI 호환 endpoint와 키 보관 경로를 지정하고 새 `jev-router` 폴더를 선택했다.
- 서버 전용 Node 클라이언트, 예제 CLI, 입력/응답 검사와 모의 테스트를 작성했다.
- 당시 키 미설정 및 직접 테스트 19개 통과는 [초기 검증 기록](../VERIFICATION.md)에 보존한다.

## 2026-10-08 — 기존 구현의 상태 확인

- 현재 파일에서 공개 Jev MCP 바이너리를 재사용하는 실행 연결과 호스트 설정 파일을 확인했다.
- 이 채팅의 실제 실행 결과: `npm run config`, `npm run mcp:config`는 키 설정을 확인했다.
- `npm run models`는 지정 주소에서 HTTP 200, `npm run mcp:models`는 모델 목록 반환 후 exit 0.
- `npm run mcp:tools`는 도구 목록을 반환했다. `npm test`는 22/22 통과, 실패·건너뜀 없음.
- 추론 POST와 호스트 실제 세션 E2E는 확인하지 않았다. 검증 문서의 이전 키 미설정 상태가
  현재 상태보다 뒤처져 있음을 발견했다.

## 2026-10-08 — 별도 작업과 Git 저장소 확인

- 최근 채팅 목록과 관련 채팅 본문을 읽었다. Jev 연동 조사·플러그인 제작 학습·AI 역할 조사는
  완료된 별도 조사였으며, EDA `research-workbench`는 별도 프로젝트였다. 확인 범위에서
  Jev Router를 병행 구현 중인 다른 채팅은 발견하지 못했다. 모든 과거/보관 채팅의 전수조사는 아니다.
- 채팅 목록에 limit 200을 요청한 호출은 최대 50 제한으로 실패했다. 허용된 limit 50으로 다시 확인했다.
- `git init -b main` 및 공개 `Kai-Leee/jev-router` 생성 후 origin을 연결했다.
- `gh repo view`로 PUBLIC, ADMIN, isEmpty=true를 확인했다. 소스 커밋과 push는 하지 않았다.

## 2026-10-08 — 역할 논의와 기술 명세 0.1-draft

- 사용자의 설명에 따라 '별도 중앙 실행기' 제안을 메인 세션의 판단 지원 역할로 수정했다 [D-002].
- 새 세션 문맥 처리보다 질문 생성에 집중하고 현재 한 세션에서 완료를 확인하는 방향을 기록했다 [D-003].
- 판단 후 handoff는 문맥 유실 우려를 해결할 수 있는지 검증할 H-001로 남겼다.
- 상황별 후보 구성을 설계하도록 위임받아 제공·등록·생성·혼합 경로와 출처 기록을 제안했다 [D-004].
- 단일 정답을 가정하지 않는 반환/선택/평가 계약과 판단 불가를 명시했다 [D-005]. 영어 기본을 반영했다 [D-006].
- [기술 명세](TECHNICAL_SPEC.md), [결정 기록](DECISIONS.md), 이 작업 기록과
  [로컬 작업 지침](../AGENTS.md)을 작성했다 [D-007]. README 진입점과 오래된 상태 설명도 갱신했다.
- 현재 소스를 읽고 실제 구현과 설계 초안의 차이를 명세에 기록했다.
- 문서 작성 중 사용자가 '자동 호출 모드'를 기본으로 하고 세부 사항은 성능 평가 중 조정하겠다고 답했다.
  D-010을 추가하고 O-001을 해결 상태로 바꿨다. 호출 중복·재귀 방지는 초기 실험 정책 제안으로 기록했다.

### 이번 문서 검증

- 대상: `AGENTS.md`, `README.md`, `MCP.md`, `VERIFICATION.md`, `docs/DECISIONS.md`,
  `docs/TECHNICAL_SPEC.md`, `docs/WORK_LOG.md` — 총 7개 문서.
- 프로젝트 루트에서 `node --input-type=module` 인라인 검증을 실행했다. 각 파일의 상대 링크를
  파일 위치 기준으로 해석해 존재 여부를 검사한 22건, 결정 정의 10개에 대조한 ID 참조 27건,
  코드 블록 구분자 32줄의 파일별 짝과 마지막 줄바꿈 검사에서 실패 0건, exit 0.
  외부 URL 접속이나 코드 예제 실행을 검증한 것은 아니다.
- 아직 모든 파일이 untracked이므로 일반 `git diff --check` 대신 각 대상에
  `git diff --no-index --check /dev/null <file>`을 실행했다. 7개 모두 공백 오류 출력 없음.
- 런타임 소스 변경 없음. 이 문서 작업에서는 런타임 테스트를 재실행하지 않았고,
  유료 추론·새 세션 생성·원격 push를 하지 않았다. 문서 변경은 로컬 미커밋 상태다.

### 다음 논의

- 자동 호출 기본은 확정됐다. O-002 결과 채택/추가 확인 조건은 평가로 조정한다.
- O-003 첫 평가 작업과 성공 기준·예산을 정하고 대표 판단 사례를 구성한다.
- H-001/H-002는 자동 전환·범용 순위 기능이 이미 구현됐다는 의미가 아니다.

## 2026-10-08 — 평가 지표 구현 전 조사

- 사용자 수용한 진행 방향과 조사 우선 지시를 D-011로 기록했다.
- 웹 검색 후 RouterBench·RouteLLM 저자 저장소·LLMRouterBench, Anthropic, LangSmith,
  Inspect, Promptfoo, 확률 보정·선택적 분류·LLM judge 편향 자료, Jev API·k6 문서를 확인했다.
- [평가 방법 조사와 구현 제안](EVALUATION_RESEARCH.md)에 방법 비교와 적용 한계,
  지표 산식/분모/결측, 단계별 비용, 비교 실험과 계산기 검증 사례를 기록했다.
- API 지연과 전체 작업 지연, 확률 품질과 confidence 보정, 실제 배포 정책과 사후 Oracle을
  구분했다. 분류 정확도만으로 모든 판단 유형을 평가하지 않도록 명세와 연결했다.
- 소스 읽기에서 기존 클라이언트의 확률 원소 검사는 있지만 합 검사는 없는 점과,
  실패 시도·전체 흐름 측정이 아직 없는 점을 후속 구현 항목으로 기록했다. 코드 변경은 하지 않았다.
- RouteLLM 특정 논문 HTML 버전은 도구 Internal Error로 열지 못했다. 실제로 읽은 저자 저장소로
  확인 범위를 한정했고 실패를 조사 문서에 남겼다.
- 이번 검증: `node --input-type=module`로 변경 문서 6개의 로컬 링크 31건, 결정 참조 31건,
  코드 블록 구분자 14줄의 파일별 짝과 줄바꿈을 검사해 실패 0건, exit 0.
  각 문서에 `git diff --no-index --check /dev/null <file>`을 실행해 공백 오류 출력 없음.
  대상은 AGENTS/README 및 docs의 DECISIONS/TECHNICAL_SPEC/WORK_LOG/EVALUATION_RESEARCH다.
- 보완 패치 한 번은 불필요한 뒤쪽 문맥으로 검증 실패해 적용되지 않았다. 해당 문맥을 제거하고
  다시 적용했다. 보완 후 동일 문서 검사를 재실행해 위와 같은 건수와 실패 0건을 확인했다.
  런타임 테스트/실제 평가는 미실행이다.
- 부수 효과: 조사 문서와 관련 안내의 로컬 미커밋 변경. 패키지 설치·유료 추론·새 세션·push 없음.

## 2026-10-08 — 역할 문서 기반 평가 구현 시작

- 사용자 D-012에 따라 역할·목적·규칙·파일 소유권을 `docs/agents/`에 먼저 작성했다.
- contract/metrics/cli 담당을 별도 하위 에이전트로 생성했고, 계약 소스가 준비된 뒤 review 담당도
  생성했다. 메인은 공통 계약·통합 entrypoint·package scripts·최종 검증을 맡는다.
- `handoff` 스킬을 읽고 실제 인계 문서는 OS 임시 폴더에 쓰도록 운영 절차에 반영했다.
  메인 재개 준비 문서는 `/private/tmp/jev-router-handoff.bTYebC/main.md`다. 아직 문맥 한계로
  에이전트를 교체한 사례는 없으며 정확한 context 잔량을 자동 측정하는 기능도 없다.
- 제품의 판단 후 세션 전환 H-001과 이번 개발 중 인계를 구별해 이전 명세의 범위를 유지했다.
- 기존 기능 검증: `node --test test/client.test.mjs test/mcp.test.mjs`에서 22/22 통과,
  실패·건너뜀 0. 로컬 모의 서버를 열 수 있는 환경에서 실행했으며 실제 Jev 추론은 하지 않았다.
- 첫 입력 계약: manifest 사례/trial을 분모에 고정하고 예상 request 수로 기록 완전성을 구분한다.
  입력 검증·순수 계산·오프라인 CLI를 나누며 실제 판단 생성/네트워크 실행은 이 단계 밖이다.
- 현재 상태와 담당별 결과는 [메인 체크포인트](agents/STATE.md)를 기준으로 계속 갱신한다.

## 2026-10-08 — 오프라인 평가 첫 구현 통합 완료

- contract/metrics/cli 담당 파일을 통합하고 review 담당의 독립 검토를 마쳤다.
  `npm run eval:demo`, `npm run eval -- --manifest ... --records ... [--output ...]`를 추가했다.
- 입력의 manifest 분모·누락·상태·복수 허용 답을 보존한다. 분류, Brier/log-loss/reliability,
  상태별 p50/p95, 단위/phase별 비용 완전성과 성공당 비용을 구현했다.
- 발견·수정 1: CLI가 validator의 `INVALID_EVALUATION`을 다른 코드와 비교해 내부 오류로
  오분류했다. 담당자가 수정하고 CLI 회귀 테스트와 독립 재현에서 exit 3을 확인했다.
- 발견·수정 2: 비용 값의 관측률이 기록된 요청만 분모로 잡아 예정 요청 누락을 숨길 수 있었다.
  예정 분모 관측률과 기록 내 값 관측률을 분리하고, 예정 분모 미상은 null로 수정했다.
- 검산기 실패: main 인라인 검산이 binary 그룹을 마지막 원소로 가정해 assertion 실패했다.
  구현 결과와 분리해 원인을 확인했으며 kind로 선택하는 지속 통합 테스트로 수정 후 통과했다.
- 최종 `npm test`: 82/82 통과, fail/skip/cancel 0, exit 0. 합성 CLI 파일 출력과 재파싱도 exit 0.
  재현 명령·분해·한계는 [검증 기록](../VERIFICATION.md)에 있다.
- 문맥 한계 인계는 발생하지 않았다. 각 담당자가 상태를 기록하고 쓰기를 종료했으며,
  main 재개 준비 문서와 합성 initial/final 보고서가 OS 임시 폴더에 남는다.
- 아직 안 한 일: 실제 모델 비교·유료 호출·자동 질문 생성·호스트 E2E·handoff 효과 측정·push.
  프로젝트 소스와 문서 변경은 로컬 미커밋 상태다.
- 최종 문서 검사 첫 실행에서 메인이 작성한 역할 문서 5개의 불필요한 EOF 공백 줄을 발견했다.
  해당 줄을 제거했다. `fd`로 모은 Markdown 20개를 Node로 검사해 로컬 링크 85건,
  결정 참조 43건, 코드 블록 구분자 40줄의 파일별 짝/줄바꿈 모두 통과했다.
  문서와 평가 소스/테스트/예제 등 총 31개에 `git diff --no-index --check /dev/null <file>`을
  실행한 재검증에서 오류 0건, 검사 스크립트 exit 0을 확인했다.

## 2026-10-09 D-020 — Jev USD 1 예산 및 실제 모듈 연결

사용자의 USD 1 지시로 이전 금액 승인 대기를 해소했다. 호출 횟수는 null을 유지하고, 모든 실험이
같은 영속 토큰 장부를 사용한다. 공개 최고 단가 USD 0.60/M, 65,536토큰 사전 예약, 응답 정산,
미정산 예약 유지, 동시 writer 차단을 구현했다. 실제 달러 청구액은 null이며 공급자 hard cap이라고
표시하지 않는다. 조사와 구현·독립 검토의 역할 문서를 먼저 작성했다.

실제 실행에서 세 가지 차이를 확인했다. (1) 첫 Jev 응답은 문서 예제와 다른 dated ID여서 정산을
막았다. 공식 동일 버전 매핑을 확인하고 저장 응답만 정산했다. (2) Claude 사전 인증은 전체 환경,
실제 자식은 USER/LOGNAME 없는 환경을 사용해 실제 호출이 Not logged in으로 종료됐다. 두 역할과
사전 조회의 환경을 공통화했다. (3) 첫 프로세스의 강제 종료가 잠금을 남겨 다음 MCP 연결이 실패했다.
보유 프로세스와 pending이 없음을 확인한 후 잠금만 복구하고, 사전 예산 검사와 정상 종료 시
SIGTERM 정리 시간을 추가했다. 기존 실패·비용·영수증을 삭제하거나 성공으로 덮지 않았다.

세 번째 실행 e2eswe-d020-03에서 실제 Claude Opus 5.5 → MCP → Jev → Docker 명령 결과까지 확인했다.
별도 Opus 모니터도 실제 응답했다. 16:15 KST 관측상 누적 차감 850토큰(작은 확인 348 + gate 502),
환산액 USD 0.00051. 이후 사용량은 실행 중 장부가 정본이다. 아직 과제 완료나 독립 채점 통과는 아니다.
Personal OS 설정도 같은 장부를 참조하도록 준비했으며 기존 앱/Vault는 변경하지 않았다.

최종 검증: npm test 297/297, 예산 집중 46/46, 합성 Chrome UI 9/9. 첫 sandbox 검사는 localhost
EPERM으로 12개가 실패했고 호스트 권한에서 재검증했다. 환경 회귀 테스트 추가 과정에서 기존 테스트
wrapper 2개가 options를 누락해 실패한 것도 수정했다. 실제 MCP 3개 응답/0추론/잠금 해제를 별도 확인했다.
현재 실행과 종료 후 export/grade/정리 순서는 agents/STATE.md를 따른다. commit/push 없음.

16:23 KST 추가: 세 번째 실행에서 Vercel 식별자 typesafe-ai/jev 응답을 받아 guard가 정지했다.
공식 제공경로와 Vercel32K 모델 목록으로 확인 후 정확한 별칭을 추가하고1735토큰 저장응답만
정산했다. 실패 기록은 보존했다. 네 번째 새 실행은 실제 Jev 판단/명령 결과/독립 Opus 관측을
확인했고 진행 중이다. 누적4회/3110입력토큰, 보수적 환산USD0.001866은 이 시점의 관측값이다.
최종 테스트298/298. 세 번째 산출물 export 후 이전 컨테이너3개를 정리했다.

## 2026-10-09 D-021 — 토큰별 공식 가격 / 실패 원인 분석

공식 Anthropic 가격표와 Jev 월간 pricing UI 및 활성 Creator 계정을 읽기 전용으로 확인했다.
토큰 각 항목 옆 환산 USD, 제공자 합계, 공식 출처/확인일, 펼침 산식·결측 설명을 추가했다.
Jev 월29USD/60M 배분과 Claude 공식 API 환산을 구분했고 USD1 공유 예산은 변경하지 않았다.
실제04의 Jev입력21975토큰은 배분USD0.01062125, Claude가격합계USD2.0264398로 CLI보고값과 일치한다.
전체 공유장부26회24560입력토큰, 월요금배분USD0.0118706667, 보수적예산사용USD0.014736.

실패04는 CLI exit0이지만 finish5회 모두continue여서 완료승인 없이 종료했다. 원본 산출물의
독립grade는 setup.sh 누락→패키지미설치→테스트수집0/기대30, reward0. 원본은 그대로 보존했다.
setup.sh만 추가한 별도 진단복사본은30/30/reward1이므로 기능검사 통과와 원실행E2E성공을 구분한다.
이전 oracle/noop 준비에는setup.sh를 넣었으나 실제brief의 설치인계계약을 검증하지 못한 공백도 기록한다.

전체 npm test311/311통과. 첫집중검사50/51의 실패는 PID문자열333 탐지가 새로운0.483333…단가를
비밀PID로 잘못 감지한 테스트결함이었다. 재귀적 pid키검사로 바꿔51/51을 확인했다.
실제IAB에서가격8개/화면폭1233=문서폭1233/실패표현을 확인했다. 모바일재검사는이번범위에없다.
신규유료추론0, 기존PersonalOS미변경, 원본컨테이너정지보존, 검증컨테이너2개제거, commit/push없음.

## 2026-10-09 D-022 실제 재실행 완료

새실행05는 원목표+설치인계계약만추가한조건이다. 같은USD1장부/Opus5.5/Jev/별도monitor를유지했다.
4분11초정상종료, Jev11회중명령7회/finish4회, 마지막finish승인. 원본산출물에main수정없이
fresh offline verifier30/30통과(reward1). 이전04실패는보존. 구체명령/토큰/추정비용/잔여검증은
[재실행보고](research/D022_RERUN.md). PersonalOS는이번에실행하지않았다. commit/push없음.

## 2026-10-09 D-023 첫 속도 대조

사용자요청으로같은명세/설치계약/모델/effort/CLI/이미지의Claude구조화직접선택1회실행.
197.515초정상종료+원본독립30/30. 기존Jev성공본250.725초+30/30. Jev쪽53.210초/Claude분모26.94%더김.
JevHTTP11회평균0.645초, gate전달합계13.710초. 순수Claude판단지연은분리계측안됨.
각1회비동시측정이고완료승인정책도다르므로인과/일반속도우위를주장하지않음. 상세 docs/research/D023_SPEED_COMPARISON.md.
비교계산초안의null이미지동등성오류를preflight실제ID존재검사로수정함. 새JevPOST0/예산장부미변경.

## 2026-10-09 D-024 판단 대체 구조와 분리 계측

역할 문서를 먼저 작성한 뒤 구조감사/규칙생명주기 구현을 분업했다. 고정 질문3개 실제 호출: Claude새CLI평균3892.618ms/Jev예산포함912.463ms,76.56%감소(분모Claude). 순수추론시간이나 품질우위 아님. 한문항finish/continue불일치. 전체E2E53.210초증가는별개.

Claude규칙생성→Jevaccept→변경계약fixture→Jevrevise→Claudev2→Jevaccept 성공. 최초native연결은 main의async export await누락으로undefined역할실패. 수정후저장승인3건동일입력재생(새Jev0)으로native위임성공. 독립감사에서생성출력의존재하지않는evidenceID를기존검증기가놓쳤음을확인했다. validator보강후저장응답재판정false,verification-correction.json으로정정. 완전성공주장없음.

신규Jev6회/8631입력,누적43회46505/보수적USD0.027903. 규칙keep시Claude재생성0은오프라인검증, 실제pilot은revise경로. 기존E2E gate교체와새구조E2E속도검증은남음. 상세research/D024_SYSTEM_ANALYSIS.md,D024_DECISION_LATENCY.md,D024_AGENT_RULES.md. PersonalOS미변경,새Docker없음,전역Claude설정미변경,commit/push없음.

## 2026-10-09 D-025 — checkpoint 재측정·비용·문서 스킬

문서역할을먼저나누고 checkpoint gate/문서스킬을서브에이전트로구현했다. main은선택형workflow연결,같은조건baseline/Jev각1회실행,원본독립채점,비용집계를진행했다. baseline251640ms/30/30/reward1, Jev287182ms/29/30/reward0. 신규Jev3회20210입력,누적46회66715토큰/보수적USD0.040029. 역할판단호출은줄었지만시간14.12%증가,모니터제외환산비용13.01%증가. 생성전역할선택만으로효율을개선했다는가설은이번표본에서지지되지않았다.

Jev산출물은-x의첫실패를기록하기전에raise하여Failed Checks:1이빠졌다. 자체검사는failed=1만확인했고Jev완료승인과독립성공을분리해야함을확인했다. 원본수정/재채점없음. 양쪽명령크기한도거절1회재생성도포함. 코드검증중workflow입력거절누락과costcoverage결측0치환위험을찾아수정했다. 전체343/343. 상세research/D025_REMEASUREMENT.md.

skills/jev-decision-records생성/검증후~/.codex/skills/jev-decision-records에설치(4파일해시일치). 독립서브에이전트가원시실패/정정영수증으로실제적용했고정정/미확인비용을보존했다. 프로젝트AGENTS와docs/decisions/D025.md에적용. 자동호스트선택은미검증. 기존PersonalOS/전역Claude설정미변경,새실험컨테이너2개정지보존/verifier2개제거,대시보드유지,private영수증·임시검토파일·미커밋소스남음,commit/push없음.

## 2026-10-09 D-026 — 판단 소유권 제안과 병렬 공개 조사

공식/커뮤니티 조사 서브에이전트 두 개로 문서·공개 소스 확인. 추천 반환과 실제 hook/함수 dispatch를 구분했다. 질문 재사용, Claude 재승인 생략, 요구사항별 근거/실패 분류의 실행 계약을 제안으로 문서화. 공개 고객 SWE 개선은 확인하지 못했고 새로운 측정값을 만들지 않았다. research/D026_DECISION_OWNERSHIP.md, research/D026_PUBLIC_PATTERNS.md, decisions/D026.md. 런타임/장부/PersonalOS 변경·새 추론·컨테이너·commit/push 없음.

## 2026-10-09 D-027 — tree/직접 dispatch 무과금 실험

역할 계약 후 구현·독립 검토 분업. 문서 기반 질문과 직접 handler, 모델+effort 프로필 전달, 임계값별 재귀 tree, 의존/쓰기범위 scheduler 구현. 합성 실험 .5/.65/.8→노드7/5/1, leaf5/4/1, 모의동시2/2/1. 18/18 신규 테스트. 전체 첫회349/361(12 localhost EPERM), 제한밖361/361. 승인 sketch/실행 자식 불일치 위험·부모쓰기범위·요청크기·요청해시 검사 보완 후 offline02 재실행. 성능/라이브미검증; 자료정리 docs/orchestration/D027_EXPERIMENT.md. 신규 paid0, 기존 runner/PersonalOS/장부 미변경, 미커밋 파일/합성로그 남김.

## 2026-10-09 D028 — 질문 정본·프로필·생성 인자 연결

사용자가 질문 규칙/type/답을 문서에서 바로 붙이고 위치를 명시하도록 지시. contracts/questions.v1.json, profiles.v1.json, worker-task.v1.json 정본과 고정경로 로더·request 준비·worker 생성 인자 factory 추가. AGENTS에 진입점 명시. 문서 원문/placeholder/동적 후보/disabled 모델 거절과 직접 spawn_worker 인자 전달 22/22 검증. benchmark-runs/d028-document-link.json 모의 응답 영수증. 실제 모델·native worker·새 계획 생성은 미연결. 기존 D027 코드/원본 해시 보존. 추가 공급자호출/컨테이너/전역설치/commit/push 없음.

## 2026-10-09 D029 — 모델/문서 연결과 실제 분할 E2E

Opus5.5/Fable5.1/Sonnet5.5/Haiku5.5와 effort 5단계 정본, worker v2, CLAUDE.md→AGENTS.md 연결 추가. 소스 최초 커밋887d360 후 Opus medium 단일/분할 각1회와 Jev1회 실행. 양쪽 원본30/30. 측정 단계 합계303.980→234.584초(단일 분모22.829% 감소), 워크플로 비용 추정USD0.905536→1.4860908(64.112% 증가). 문맥 중복 원인 기록. p=.66에 .5/.65는 split, .8은 single; 강제 대조이며 자동라우팅 효능/확률 calibration 미검증. 상세 [D029 결과](orchestration/D029_RESULTS.md), [구조화 기록](decisions/D029.md). 추가 유료 재실행 없음, 원격 push/PersonalOS 변경 없음.

## D030 — 2026-10-09 입력 필드 감사

[조사](orchestration/D030_INPUT_AUDIT.md), [기록](decisions/D030.md). 기존 request 동일값 중복 제거 복사본은 split bytes 52.071% 감소(원본285625분모, system제외). 토큰/비용 감소 아님. Jev 판단 대체와 코드의 projection을 분리 제안. 런타임/계약 변경·새 유료호출 없음.

## D031 — 2026-10-09 입력 개선·판단기 비교 구현

[구현](orchestration/D031_IMPLEMENTATION.md), [역할 조사](orchestration/D031_ROLE_RESEARCH.md), [기록](decisions/D031.md). 중복 제거+직접/전이 의존 선별, v3, Claude/Jev/script/forced 분리, 고정계획 재사용·지표 비교 추가. offline split bytes71.378%감소(원본분모), 토큰/품질 미측정. 전체390/390 통과. telemetry역할/single ID충돌 수정. 작업자Opus medium 유지. 미커밋,paid0,push없음.

## 2026-10-09 D030/D031 공개 반영

사용자 요청에 따라 입력개선·판단기 비교 코드와 조사 문서의 커밋/push를 진행한다. 최종코드 무과금 재생 d031-push-verification.json에서 기존 집계와 동일함 확인. D031_SAVINGS_STATUS.md에 작업자별 bytes와 과거 D029 유료측정의 시간감소/비용증가 및 미검증 절감 분리. 원시 private 로그/키는 제외한다. 실제 토큰/비용 재측정 없음.

## 2026-10-10 D032 축소 후보 조사·설명 영상

사용자 요청에 따라 codebase-design 스킬을 적용, 현재 완료된 request 중복제거와 추가 system 계약 축소 후보를 구분했다. D032_BUILDER_EXPLAINER.md, video/d032-scenes.json/render_d032.py 작성. private MP4105.16초 한국어 합성내레이션 제작; ffprobe/전체decode검증 통과. 최초 sandbox TTS파일 duration N/A 실패 후 로컬 음성서비스 권한으로 재제작. 실제 모델호출0,런타임변경0,commit/push없음.

## D033 — 2026-10-10 20회 실험 완료

[결과](orchestration/D033_RESULTS.md). 기본+4후보각4회,Opusmedium,패키징3파일/나머지8고정.20/20원본30/30통과. output_dedup평균입력5.099%/비용환산4.873%/시간6.735%감소(각baseline평균분모).compact는입력감소최대이나시간3.278%증가. CLI환산총USD1.5133082,Jev0.20verifier제거,미커밋소스·private결과유지.운영채택미수행.

## D034 — 2026-10-10 자동/강제 Jev 확인

[감사](orchestration/D034_ROUTING_AUDIT.md). 최근20회Jev0,default forced는Jev호출후양쪽실행으로답미사용. jev모드만답기반실제arm선택. 저장답재생에서jev와script둘다split. 호출만추가하면감소하지않으며matched선택호출비교필요.정책4/4테스트,추가유료0.소스변경/push없음.

## D035 — 2026-10-10 자동 라우팅 업그레이드 조사

[조사](orchestration/D035_UPGRADE_RESEARCH.md), [구조화 기록](decisions/D035.md). 공식 Jev 문서, RouteLLM, Anthropic workflow/evals, Jev rubric-judge 논문 초록 확인. event→script→exact cache→Jev→handler, template 기반 planner 생략, 새 근거 기반 fallback을 제안. Claude 통합 계획+선택 baseline을 포함하는 평가 설계. 정책 채택/구현/신규 유료호출 없이 문서만 갱신. 논문 전체 재현과 실제 절감은 미검증.

## D036 — 2026-10-10 자동 checkpoint 구현

[D036](orchestration/D036_IMPLEMENTATION.md), [기록](decisions/D036.md). main 구현/독립 읽기전용 리뷰. auto→rule/cache/Jev→실제 file arm 연결, force_jev와 forced 분리. 기본 auto/명시 threshold. 숫자 ID 불일치, 단일작업 실행기 거절, 재진입 교착, 실패시간 0 계측 결함 수정. 집중17/17,전체407/407,저장응답+합성cache 재생통과. 최초localhost EPERM12실패보존.새유료0,실제절감미측정,미커밋변경/로그유지,push없음.

## D037 — 2026-10-10 실제 라우팅 비교

[결과](orchestration/D037_RESULTS.md). Claude/force_jev/auto각1회,동일고정계획,Opusmedium,threshold.65. 3/3각30/30통과. runwall157.595/108.900/107.379초. 비교환산USD.5265176/.5658288/.5741208:빨라졌으나7.47%/9.04%더비쌈. Claude10/Jev2새호출,공유Jev누적USD.0508722,pending없음. auto실제Jev호출확인,캐시/bypass없음. 반환model문자열차이보존. verifier3개제거,private후보/로그유지,PersonalOS/push미변경.

## D038 — 2026-10-10 다음 실험 조사

[조사](orchestration/D038_NEXT_EXPERIMENTS.md), [기록](decisions/D038.md). main과 읽기 전용 연구 agent가 공식 문서/원저자 자료를 확인했다. 분할·병렬화 분리→전체 작업 output_dedup→비용제약 분할→반복 checkpoint→통합 planner/template 비교를 제안. 실제 API transport와 fixture 채점의 차이를 기록. 미래 횟수/정책은 제안이며 새 유료 실행 없음. 문서만 갱신, 기존 미커밋 변경 보존, push 없음.

## D039 — 2026-10-10 더 큰 과제 조사

[조사](orchestration/D039_LARGER_TASKS.md), [기록](decisions/D039.md). 공개 명세/metadata로 OpenAPI·DiskCache·GraphQL 등을 비교, Personal OS 역할별 읽기 전용 검토. 최대4작업/동시2/no-tools와 전용 grader 제약 확인. 새 실행·설치·paid 없음. 웹 개별 파일 fetch 실패는 로컬 고정 commit 근거로 구분. tomllib 초기 오류 뒤 기존Python3.14로 목록 생성. 미커밋 문서 유지,push 없음.

## D040 — 2026-10-10 OpenAPI 첫 실행

[결과](orchestration/D040_RESULTS.md), [기록](decisions/D040.md). 선택 manifest 채점기 구현, emptyreward0/reference63/63 대조완료. Claude plan+decision 완료 뒤 단일 구현600초 timeout/uncertain, 생성파일0. 총비용unknown, 완료2호출환산부분합USD.489676. stop rule로 auto/Jev 및유료Opusmonitor 미실행. 실패분석/독립검토 완료, 비교미완료. Jev신규0/장부유지. verifier2제거,이미지·clone·private로그 보존,미커밋/push없음.

## D041 — 2026-10-10 제한 변경과 원인 설명

고정10분 호출cap 제거,남은phase예산 사용. D040 Jev신규0이며 메인의 중단규칙 적용 때문임을 정정. 새유료실행없음. [기록](decisions/D041.md).


## D042 — 2026-10-10

Concurrent trial finished. Both provider responses succeeded but artifact JSON parsing failed; zero files and no independent grade. Jev settled1 request/11,205 input; cumulative95,992 of10M. Separate Opus monitor completed. See `docs/orchestration/D042_RESULTS.md`. Output contract repair remains pending; no push.


## D043 — confidence 기준 (2026-10-10)

현재 pilot 기본 판단 기준은 confidence다. `split-confidence.v1.json`의 execution choice(split/single/defer)에 붙은 confidence를 명시 `--confidence-threshold`와 비교한다. 낮으면 needs_evidence, 충분하면 선택된 실행으로 직접 연결한다. `--decision-basis probability --split-threshold`는 과거 재현용이다. 정본 설명: `docs/orchestration/D043_CONFIDENCE.md`. 회귀 419/419, 유료 호출 없음. D042 산출물 JSON 실패는 아직 미수정. 임계값은 미보정이며 확정 최적값 없음.


## D044 — 2026-10-10

Choice audit and 25/25 local checks completed. split-confidence.v2.json clarifies actual artifact transport and defer blockers. Live diagnostic process was rejected by automatic approval review pending concrete payload egress approval; no new API request. See docs/orchestration/D044_CHOICE_AUDIT.md.


### D044 live result after explicit approval — 2026-10-10

One Jev POST completed: defer/confidence0.89, HTTP752ms, input11592/output40. Shared input ledger107584 of10M, pending0. No worker call or grader. All three options retained; transport repair remains pending. Supersedes earlier pending-approval status. Evidence: docs/orchestration/D044_CHOICE_AUDIT.md and benchmark-runs/d044-choice-audit-01/.


## D045 — 1~5 작업 개수 (2026-10-10)

현재 pilot 기본은 count. task-count.v1.json에서 실제 후보1..N(최대5)을 선택하고 confidence는 기록만 한다. 1은 유지, 2~5는 해당 개수로 역할·작업 묶음 실행. 동시 실행 수와 별개다. 단일 후보는 Choice API 최소2개 제한 때문에 force_jev 포함 무호출로 진행한다. 과거 confidence/probability 정책은 명시 옵션으로 유지. 문서: docs/orchestration/D045_TASK_COUNT.md. 전체424/424 검증, 유료 호출 없음. D042 출력 실패는 미수정.


## D046 — 2026-10-10

Actual numeric trial terminated failed after20min37sec: Jev selected2/confidence0.53, first8-file group hit output continuation and final JSON parse error; files0, group2 not started, grading not run. Opus monitor completed separately. Shared ledger139322/10M, pendingnull. See docs/orchestration/D046_COUNT_RUN.md. No commit/push.


## D047 — 전체 작업 효율 우선 (2026-10-10)

사용자 정정: 현재 Jev 입력량은 허용 가능하며 전체 작업 효율을 우선한다. 입력 축소를 우선 과제로 삼지 말고 충분한 판단 근거를 유지한다. 기존 예산은 유지. 현재 D046은 초기 task_count만 Jev1회 호출하며 작업 중 실패·재분할·모델/effort·요구사항 판단은 미연결이다. D044 실패 근거도 D046 state에 전달되지 않았다. 감사: docs/orchestration/D047_DECISION_COVERAGE.md. 후속 연결 순서는 제안이며 이번에는 구현·유료 호출 없음.

## 2026-10-10 — D048/D049/D050 complete measurement, unsuccessful tasks

User requested new whole-task configuration and parallel cost/time/efficiency comparison. Executed fixed Opus5.5medium workers with Claude versus Jev lifecycle decisions. D048 verifier tomllib import was our environment defect; D049 preserved completed artifacts and reverified using installed tomli. D049 local oversized request never reached API; D050 removed exact repeated strings, preserving original content. Representation now differs between conditions; causal judge-speedup forbidden.

Original pinned independent grades: Claude60/63, Jev0/63. Jev's next review HTTP_ERROR stopped before group4; missing pyclientgen executable observed in grade output. Telemetry discarded numeric HTTP code; now preserved and tested without retries or ledger changes. Outstanding65536-token reservation retained; exact failed-call cost unknown. Continuous original start→grade: Claude1532792.806ms, Jev1721740.897ms; API-equivalent Claude8.6874798USD, Jev known subtotal5.6714524USD (totalnull). Separate monitor0.08522USD; transport smoke0.018532USD. These are not actual subscription charges or success-adjusted savings.

Evidence: benchmark-runs/d050-analysis-final.json, d050-grade-{claude,jev}/result.json, d050-monitor/result.json; docs/orchestration/D048_D050_LIFECYCLE_RESULTS.md. Full tests464/464 before final telemetry patch; targeted client/telemetry40/40 after patch. Logs pinned under benchmark-runs/d050-verification/. Grader containers removed. Ignored run artifacts, temporary isolated CLI directories and uncommitted changes remain; no commit/push, no Personal OS changes.

## 2026-10-10 — D051 corrected matched rerun complete

Implemented explicit evidence-bound refund reconciliation, identical decision projection/encoding for both conditions, isolated public generated-client smoke, and safe HTTP failure metadata. Existing failed run remains immutable. Fresh comparison: Claude61/63 versus Jev0/63. Jev first group repaired then review stopped before remaining groups; all3POSTs succeeded. Lower decision API-equivalent cost did not reduce total completion cost or produce completion. Report: [D051 results](orchestration/D051_RESULTS.md); reproducible analysis and timing commands included. Separate monitor complete. Full498tests passed before final public-smoke expansion; final public7passed. No more calls. Run logs/candidates, isolated temporary directories and uncommitted changes retained; no commit/push or Personal OS edits.

## 2026-10-10 — Current question wording correction

User requested removal of confidence-recording/non-threshold wording. Removed it from two active question contracts and five runner prompts. Confidence response fields and execution logic remain unchanged; no new threshold was specified. Historical benchmark requests/responses and D051 protocol are preserved; current sources now differ from the completed experiment. User raised Jev-driven task decomposition: proposal is requirement-unit assignment/dependency decisions through typed questions, followed by deterministic plan validation and worker instruction assembly. This proposal is not implemented or measured. No paid calls.

## 2026-10-10 — Jev-driven decomposition design and test plan

User requested consideration of the proposed tests and architecture. Recorded requirement-first typed assignment, dependency decisions, deterministic plan validation, worker instruction assembly, recursion boundaries and fair end-to-end comparison in docs/orchestration/JEV_TASK_DECOMPOSITION_DESIGN.md. Status: design only; no new implementation, inference, threshold selection or performance claim. Next: contracts/validators and offline negative controls before a frozen live comparison.

## 2026-10-10 — D052–D054 decomposition implementation and live verification

Parallel builder/fixture/reviewer work completed. Typed questions, anchored file ownership, requirement accountability, deterministic dependency validation, scoped worker instructions and evidence-bound repair were implemented. Live planning30calls succeeded; whole-task prepared62/63 versus anchored continuation0/63. Local payload defect corrected with exact-roundtrip representation; providerHTTP400 remains unexplained because client discarded body. Provider refund confirmed and ledger reconciled without replay. Separate Opus monitor completed, API-equivalentUSD0.071498; planning30calls versus31total is explained by one worker. Final npm test561/561passed (benchmark-runs/d054-preflight/full-tests.log). Full evidence/reproduction: orchestration/D052_D053_RESULTS.md. No efficiency claim. Runtime/grade/monitor terminal; retained artifacts and uncommitted changes, no commit/push/POS edits.

## 2026-10-10 — D055 recursive task/test design prepared

Read current contracts and official Jev question-type docs. Added D055 design and English question/worker instruction draft with two output lists, source preservation, bounded-progress requirements and test specification versus execution distinction. No arbitrary-text generation attributed to Jev. Draft is not loaded by existing runners. Format/evidence-record checks only; no inference, worker, benchmark, ledger change or Personal OS edit. Exact experimental bounds remain to be configured.
## 2026-10-10 — D056 recursive task/test planning

출처가 있는 의무 80개·테스트 명세 85개, 재귀 분할·배정, 표 기반 입력과 CLI를 구현했다. 실패한 POST 3건을 보존하고 환불을 확인했다. 진단 요청에서 모델 입력 한도 초과를 확인한 후, 표현을 바꾼 조건은 240/240회 응답을 받았다. 계획은 240회 판단 한도에서 `partial`로 끝났다. 분할 9회, leaf 27개, 깊이 3이며 의무 80/80개를 보존했다. 단일 후보 처리 20개와 검토 대기 7개를 구분했다.

계획 249.348초, 입력 5,232,649·출력 33,144토큰, 토큰팩 환산 USD3.1395894다. 별도 Opus 5.5 medium 모니터는 `attention`, CLI 환산 USD0.66078이다. 책임자 배정 195회가 입력의 87.2332%를 사용했다. 최종 장부는 6,669,999/10M이며 미정산은 없다. 적정 분할과 전체 효율 개선은 미검증이다. [결과·재현·정정](orchestration/D056_RESULTS.md).

검토 이후 최상위 종료 코드와 모니터 지표 설명을 보완했으며 유료 재호출은 하지 않았다. 제품 작업자·테스트·채점, Personal OS 수정, 커밋·푸시는 수행하지 않았다. 비공개 근거, CLI 임시 디렉터리와 미커밋 변경을 보존한다.


## D057 — 실제 개발 완료 비교 (2026-10-10)

[결과](orchestration/D057_RESULTS.md), [결정](decisions/D057.md). 실제 A63/63완료29분28.518초, B62/63미완료(시도23분25.734초). Jev는 실제1회호출로1leaf/0split을 선택했다. 완료 속도 개선값은 null이며 병렬화 이득 미검증. API환산 A7.6330826/B8.4574292 USD, 실제 청구 unknown. 원본 후보/평가를 보존했고 유료 반복·커밋·푸시는 없다.


## D058 — Jev 유지1 제외 재판단

[기록](decisions/D058.md): D057 state 그대로,2~5 조건부 선택에서3채택. 실제1회/1765.3185ms/입력25015·출력46/환산USD0.015009. 작업배정·개발은 미실행. 최초 로컬 계측 역할명 검증 오류는 API 이전 실패로 보존.

## 2026-10-10 — D059 순차 멀티 선택 실제 개발

[결과](orchestration/D059_RESULTS.md), [기록](decisions/D059.md). 개수3→65/13/2배정→Opushigh/Opushigh/Sonnetmedium 실제 연결; Jev8회11.563초. 29분50.166초 뒤 독립57/63로 미완료. 환산USD9.444808,별도모니터0.13888. 초기입력한도실패·환불·새codec조건·모니터전달누락 보존. 전체748/748회귀와29/29소스동결확인,제품실패와구분. 원본POS변경·커밋·푸시없음.

## 2026-10-10 — D060 배정 상한과 공개 검증

역할 문서 후 planner/gate/reviewer 분업. 새 v2질문·할당기·검증registry·workflow 연결, 기존 D059보존. 로컬799/799통과; 실제80/85입력 모의65개초과거부와27/27/26재배정. 초기fixture schema누락과 review의선검사/실패반환결함 수정. 제품85개검사매핑 누락을 호출전차단; 실제 모델·제품재실험 미실행. [상세](orchestration/D060_BOUNDED_VERIFICATION.md).

## 2026-10-10 D061 최대작업자확대

기존v2증거보존하며v3선택지2..30/envelope30연결.30명모의배정20*3+10*2,85mockrequests;전체811/811pass.유료미실행/실제절감미확인.[상세](orchestration/D061_MAX_WORKERS.md).

## 2026-10-10 — D062 실제 최대30 작업자 선택 실험

[기록](decisions/D062.md), [결과](orchestration/D062_LIVE_PLAN.md). 실제Jev13회/19.78265초,2명선택,3재배정후실패. 입력450692/출력10077,환산USD0.2704152. 독립원본재생13/13일치. 별도Opus모니터완료 및 계산오류정정. 실행후eventID결함수정,관련12/12검증. 개발/제품테스트 미실행,기존PersonalOS변경·커밋·푸시없음.

## 2026-10-10 — D063 DAG 설계 검토·계획 반영

사이드 README와 연결5문서, 현재 allocator/envelope/workflow/gate/registry/executor/loader를 대조했다. 역할 문서 작성 후 독립 검토를 분업했다. [계획](orchestration/D063_DAG_PLAN.md)에 작업자/task 분리, 불가분 묶음 가능성, 검증 revision 벡터, 지역/통합 검사 교착 방지, unknown 시간 정책과 동일 실행기 비교를 반영했다. AGENTS/CLAUDE/계약 안내/명세/STATE에 진입점을 연결했다. 사이드 원본은 당시 전달 실패까지 보존한다. 문서 검사 결과는 D063 기록 참조; 제품 소스·장부·유료 호출·실험 원본 변경 없음.

## 2026-10-10 — D064 병렬 로컬 개발·스킬 관리

[역할 계약](agents/D064_PARALLEL.md)에 경로 소유권과 API를 먼저 정한 뒤 스킬1명/계약/공개검사/어댑터/스케줄러/검증/관측을 분업하고 독립 검토했다. root는 workflow·합성 pilot을 통합했다. revision precheck와 snapshot 사이 경쟁 및 run ID 사전 검증 누락을 실제 재현해 수정했다. 공개 checker의 경로 alias/import 오류, strict registry 메타데이터 오류, pilot01 환경 표기도 정정하고 초기 증거를 보존했다.

최종 `npm test`993/993 통과, pilot02 실측154.889334ms·검사 subprocess3/3·최대동시2. 임의CP40ms와 제품 완료시간을 구분한다. 공개36/85연결,49누락은 명시적으로 blocked; 정상4/결함35대조 실행과290assertion 근거를 남겼다. 스킬 source2개 구조검사·helper6/6·독립 수동 적용, inventory/backlog를 추가했고 설치본은 유지했다. [구현·남은 순서](orchestration/D064_IMPLEMENTATION.md), [결정](decisions/D064.md). 모델 요청·장부 변경·원본PersonalOS변경·커밋·푸시 없음. 로컬 소스/문서/evidence는 보존했다.

## 2026-10-11 — D065 병렬 구현·실제 실행·검증기 정정

[역할 계약](agents/D065_PARALLEL.md)으로 공개검사3영역, 실제 파일 runtime, 의미 handler, runner, 중복 테스트 정리, 기존 스킬 담당1명과 독립 검토를 분리했다. 실제 Jev/Claude 호출은 root만 실행했다. 공개 mapping36/85→85/85, 삭제 대상 테스트 정의74→58. 고유 oracle 변조/일부 의무 누락 반례가 초기 통합에서 빠진 것을 독립 검토로 발견하고 남은 정의 안에 복원했다. 전체 회귀1,009개와 실제 제품 결과의 분모는 다르다.

`node scripts/dag-e2e.mjs benchmark-runs/d065-live-01 --spend`가 Jev17회·Claude16회로16개 파일을 생성했다. 담당자2명·최대동시2·각8개파일, Opus5.5 medium이었다. 원본19m56.51s 뒤 `uncertain / DAG_PUBLIC_EVIDENCE_INVALID`, 독립 채점62/63 통과. 후보에서 생성한 무인자 endpoint의 bare-star 구문 오류를 공개 검사로 확인했다. 후보/원본실행은수정하지않았다.

별도 HTTP/CLI진단에서초기화실패17개미실행과CLI8/15pass·7fail을관측했다. 실패case assertion0과전체초기화실패를잘못거부하는runner를수정하고보존보고서를무모델재생했다. CLI설치원본검사의2건오탐은상속cwd의import우선순위때문임을실제재현했다. 중립cwd수정과foreign-origin거부증거를남기고공개검사v3대조를갱신한다. 첫분석기의이벤트순서오류와일회성진단launcher실패도원본을보존했다. 최신검증명령·시간·소스해시는[실측결과](orchestration/D065_RESULTS.md)와[독립검토](agents/D065_REVIEW.md)를따른다.

Jev입력229,540·출력823,공식토큰팩환산$0.137724. Claude구현API환산$9.6346728,별도Opus모니터$0.63698. 월구독실제청구액은null이며개발대화/보조에이전트비용은미계측이다. 누적장부7,633,742/10M입력·pending0. 기존PersonalOS/Vault·설치스킬·Git원격은유지하고로컬소스/문서/모든실패와후속진단을보존했다. 성공속도개선은아직측정되지않았다.

최종 고정 완료: 공개 v3 정상85/85·결함81/81, 전체 회귀1,009/1,009 통과. 최초 최종 회귀의 sandbox listener EPERM 12건은 보존하고 같은 소스의 권한 있는 재실행을 분리했다. 삭제 대상4개 파일의 최종 감소는16개 정의·199줄·10,071바이트다. D065 기록 해시34개/주장13개, D064 보존 기록, tracked diff 검사와 문서21개/링크341개를 확인했다. 실제 후보 실패와 별개로 검증기 R1–R8은 독립 검토에서 수정 확인됐다. 원본 후보를 고치거나 유료 모델을 재호출하지 않았다. [종료 도구 출력](../benchmark-runs/d065-local/closeout-tool-checks.json), [검증 정본](../VERIFICATION.md).

## 2026-10-13 — 사용하지 않던 jev-mcp 래퍼 제거

Jev 호출은 모두 `src/client.mjs`의 HTTP 클라이언트(`createJevClient`)로 직접 한다. `freepik-company/jev-mcp` v0.3.1 래퍼는 runner에서 쓰이지 않았고, 이 저장소의 Claude 세션 기록에서도 `mcp__jev-ai__*` 도구 호출이 0건이었다. `.mcp.json`, `.codex-plugin/`, `bin/mcp-server.mjs`, `bin/mcp-check.mjs`, `test/mcp.test.mjs`, `MCP.md`, `vendor/jev-mcp/`, `npm run mcp*`를 제거했다. `src/mcp.mjs`에는 `bin/benchmark-smoke.mjs`가 쓰는 범용 `connectMcp`만 남겼다. 검증: `npm test` 1345/1345. 과거 기록(VERIFICATION, D034)은 수정하지 않았다.

## R20261014 D083 스킬 실행 연결

[구현·검증·미해결](orchestration/POINTSMAN_D083_GATEWAY.md). 새 브랜치 feat/d083-skill-gateway. 분해·모델·담당 판단 gateway, source/body/response/기록 강제. Codex 실제 호스트 통과; Claude429; 장부 보존1건 미해결. 기존 결과를 성공으로 다시 쓰지 않았다.

## R20261014 Codex 성능 벤치마크 준비

[실행 어댑터·동일 질문 비교·E2E 계획](orchestration/CODEX_BENCHMARK.md). 기존 branch 유지, source 신규 분리, mock9/9, 과거 실제 trace 오프라인 파싱. 새 유료 호출/전체 개발 비교 없음. 공유 장부는 별도 서비스 정산이 계속 기록되는 운영 상태로 확인하여 복원하지 않음.


## R20261015 부분 수리·담당 근거·CLI 고정과 새 비교

[결과·한계·부수 효과](orchestration/CODEX_REPAIR_RESULTS.md), [구조화 기록](decisions/R20261015_CODEX_REPAIR.md). 새 Codex 제품 미완료, Jev 최종 검사 Docker 장애로 uncertain. 초기 동일210질문 구간37.847배는 전체 개발 완료 가속도가 아니다. 기존43920파일·119소스핀 불변. 추가 추론 없는 후보 재채점도 Docker 부재로 막혀 보존 후보로 이어갈 수 있다. 메인 PR14/v0.3.3에는 역사적 D067 완료실험의 긍정적 수치와 DAG 라우팅 소개만 반영했다. 연구 구현은 미커밋 상태다.


## 2026-10-15 — 사용자 직접 Docker 종료·재채점 보류

사용자가 Docker 직접 종료와 재채점 보류를 확인했다. Docker 재시작/추가 모델 호출/자동 재채점 없이 후보와 원본 결과를 보존한다. [보류 기록](orchestration/CODEX_REPAIR_HOLD_20261015.md).


## 2026-10-15 — 기능 경계·스킬 분해·시간/토큰 공개

[구조화 감사](decisions/R20261015_CAPABILITY_PUBLICATION.md). main/research/로컬 기능·스킬을 구분하고 D067완료3조건의 시간·토큰과 별도Codex초기판단구간을 재검증해 PR15/main02ace1d/v0.3.4에 게시했다. 메인394검사·269링크·CI4통과. 토픽jev/jev-router/dag반영. 스킬분리 자체 절감은 미측정. 새모델호출/Docker재시작/보류채점없음. 연구코드·기존결과보존.


## 2026-10-16 — D067 이후 결과 연혁 누락 보완

[기록](decisions/R20261016_POST_D067_RESULTS.md). D069·D070보존수리·D076·D079·D082·D083·D085 성공을 포함한 D068–D085 연혁을 PR16/mainbaab3d1/v0.3.5로 게시했다. 기존메인요약 누락을 정정. 새실험·유료호출·Docker재기동·보류채점 없음.

## 2026-10-16 D088 종료

모델정본·입력v5/native정산·새gatewayv4를역할별로통합하고88/88무과금회귀·실제D087차단입력재생·임시native장부연결을확인했다. Mac에서새Codex/Jev1쌍을실제로종료했다. [측정](orchestration/D088_CODEX_RESULTS.md), [결정](decisions/D088.md). 별도감사로34원시영수증/공개93cases×2/독립후보38files×2/장부delta를대조했다. 공개미완료라성공가속률은null.414실행소스변경0·기존49,220파일변경0·pending0·임시HOME정리·기존컨테이너5개동일. 새worktree코드/문서/결과미커밋,커밋·푸시없음.


D093 시작(2026-10-17): 최신 사용자 요청에 따라 모델+노력도+공개 성과를 쓰는 네 전체 개발 조건 준비. 역할별 병렬 검토, root만 실제 호출/환경/장부. 첫 Claude 연결은 응답 성공이나 builtin3개 격리 오분류로 검증 실패; 원문 보존 후 규칙 보정 중. 전체 개발 실행/개선 수치는 아직 없음.

D093 종료(2026-10-17): Codex판단과Claude판단만 공개93/93·독립63/63 완료. Jev+Codex no-op5/7과문맥누락으로미완료, Jev+Claude unknown2로전송전중단. 원래/회복/최종v13 세source phase·원문을보존했다. 초기환경별칭/성공본문오분류·Docker비권한관측·절대경로보존검사오류를정정기록했다. [결과](orchestration/D093_FULL_PROVIDER_RESULTS.md). 전체관측4,365,774토큰·참고22.0137456USD이며실청구미확인, 추가실행/커밋/푸시없음.

D094 종료2026-10-17: 콜드스타트잠정선택/blocked재질문1회/진짜불확실보존구현,79/79통과후새JevClaude1회. 공개93·독립59/63미완료. 수리2/2,1342232.30725ms,950634tokens,참고6.8788884USD. [결과](orchestration/D094_CLAUDE_PROVISIONAL_RESULTS.md). 이전9941보존/source162불변·추가재실행없음.
