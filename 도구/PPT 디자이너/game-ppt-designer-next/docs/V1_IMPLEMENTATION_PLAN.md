# PPT 디자이너 V1 구현 계획서

상태: 단계 0 부분 완료 · 단계 1~5 완료 · 단계 6 부분 완료 · 단계 7~9 완료  
종합: **V1 functional vertical slice complete · portfolio-quality generation not yet complete**
작성 기준: V5 + V6 + Architecture Polish + 현재 저장소 조사 결과  
원칙: 기존 코드를 최대한 재사용하고, Balance 전용 경로는 확장하지 않는다.

## 1. 만들려는 것

사용자가 작성한 게임 기획 내용을 바꾸지 않으면서, 읽기 쉽고 설득력 있는 한 장의 기획서로 시각화하는 흐름을 먼저 완성한다.

첫 완성 범위는 다음과 같다.

```text
게임 기획 원문
→ 내용과 관계 정리
→ 설명 구조 결정
→ 관련 디자인 규칙과 참고 자료 선택
→ 한 장 구성
→ 실제 화면 생성
→ 내용 누락·숫자·겹침 검사
→ 디자인 검토
→ 필요한 경우 한 번만 부분 수정
→ 사용자 승인 또는 거절
→ 선택 결과 기록
```

첫 기준 내용은 다음 메커니즘을 사용한다.

```text
회피 ×3
→ 시간 파편 획득
→ 시간 정지 5초
→ BREAK
→ 받는 피해 +50%
```

## 2. 이번 V1에서 지키는 원칙

1. 사용자의 문장, 숫자, 단위, 관계를 임의로 바꾸지 않는다.
2. 먼저 일반 규칙으로 처리하고, 규칙만으로 판단하기 어려울 때만 AI를 사용한다.
3. AI가 모호하게 해석했더라도 결과에 큰 영향이 없으면 사용자를 방해하지 않는다.
4. 해석에 따라 결과가 크게 달라지는 경우에만 사용자에게 확인한다.
5. AI에게 저장소 전체나 전체 대화를 보내지 않는다.
6. 각 단계는 필요한 자료만 다음 단계에 전달한다.
7. 디자인 검토 전에 내용 누락, 숫자 오류, 겹침 같은 명확한 오류부터 검사한다.
8. 명확한 오류가 하나라도 있으면 결과를 사용자에게 제시하지 않는다.
9. 디자인 검토 AI는 최종 심판이 아니라 조언자다.
10. 한 번의 선택을 곧바로 영구적인 디자인 규칙으로 만들지 않는다.

## 3. 문서 우선순위

현재 V1 구현에서 문서 간 내용이 충돌하면 이 `V1_IMPLEMENTATION_PLAN.md`를 우선 기준으로 사용한다.

특히 기존 `EVAL.md`, `ROADMAP.md` 등에 남아 있는 강제 A/B, PDF-first, PPTX later 같은 과거 결정이 현재 V1 계획과 충돌하면 현재 계획을 따른다.

단, 기존 문서에 있는 유효한 품질 기준과 Hard Gate 원칙은 유지한다. 이 우선순위는 유효한 검사 기준을 삭제하는 근거가 아니다.

## 4. 유지할 현재 코드

다음 기반은 새로 만들지 않고 현재 구현을 사용한다.

- 원문과 출처를 추적하는 구조
- 현재 SlideIR
- 현재 RenderTree
- Reference Engine
- 실제 HTML/SVG/PNG/PDF 렌더링
- 한국어 텍스트 측정과 줄바꿈
- 화면 밖 요소, 텍스트 넘침, 충돌 검사
- 사용자 선택 기록의 기본 구조
- Dashboard → Project → Workbench 흐름
- Balance 기획서 결과와 테스트 자료

현재 SlideIR은 이름을 유지하되, 역할을 “무엇을 말하는가”로 제한한다.

V1에서는 기존 SlideIR을 Semantic IR 역할로 재사용한다. 별도의 `SemanticIR` 데이터 모델을 추가하지 않는다.

### SlideIR legacy boundary

현재 SlideIR의 `pagePreference`, `preferredProfile`, `primaryOutput`, `editablePptxRequired` 등은 기존 구조 재사용 때문에 남아 있는 legacy field다.

V1의 Semantic Interpretation과 Information Design 단계에서는 이 field를 의미 판단에 사용하지 않는다. 필요하면 이후 Composition 또는 Export 책임으로 분리할 기술 부채로 기록하되, 지금은 대규모 IR 리팩터링을 하지 않는다.

## 5. 새로 필요한 최소 기능

### 5.1 Information Plan

내용을 어떤 순서와 구조로 설명할지 기록한다.

포함하는 내용:

- 이 장이 말할 한 문장
- 정보 사이의 관계
- 읽는 순서
- 가장 먼저 보여야 할 정보
- 주인공과 보조 정보
- 사용할 게임 기획 문법

색상, 글꼴 크기, 좌표는 넣지 않는다.

### 5.2 실행 관리자

각 단계를 정해진 순서로 실행하고 결과를 저장한다.

이 기능은 스스로 판단하는 별도 AI가 아니라 일반 프로그램 코드로 만든다.

담당 범위:

- 단계 순서 관리
- 필요한 AI 호출
- 결과 형식 검사
- 캐시
- 재시도
- 최대 한 번의 수정 제한
- 품질 검사 결과 관리
- AI 호출별 입력·출력 token 기록
- AI에 전달한 context artifact ID 기록
- 검색 결과 개수 상한 적용
- context budget 초과 시 호출 중단

### 5.3 통합 품질 검사

기존의 여러 검사를 하나의 최종 통과·실패 결과로 묶는다. 단, 내부 검사는 다음 두 종류로 분리한다.

#### Program Validator

일반 프로그램 코드로 확정할 수 있는 오류를 검사한다.

- 숫자와 단위
- 화면 밖 요소
- 텍스트 넘침
- 요소 충돌
- source ID 누락

#### Source Fidelity Validator

원문의 의미가 결과에서 제대로 유지되었는지 검사한다.

- 중요한 관계 보존
- 의미 왜곡
- 필수 내용 누락

명확한 규칙으로 확인할 수 있는 부분을 먼저 검사하고, 규칙만으로 확정할 수 없는 의미 문제에만 제한적으로 AI를 사용할 수 있다.

필수 검사:

- 원문 정보가 보존되었는가
- 숫자와 단위가 정확한가
- 중요한 관계가 유지되었는가
- 필수 내용이 빠지지 않았는가
- 글자가 영역 밖으로 넘치지 않는가
- 요소가 서로 겹치지 않는가

하나라도 실패하면 전체 결과는 실패다.

### 5.4 디자인 검토 결과

실제 생성된 화면을 보고 다음을 평가한다.

- 무엇이 먼저 보이는가
- 읽는 순서가 자연스러운가
- 글이 읽기 쉬운가
- 간격이 안정적인가
- 한 장으로서 통일감이 있는가
- 공간을 낭비하지 않는가
- 제출 가능한 수준으로 보이는가

검토 결과는 문제 위치, 문제 이유, 수정 제안으로 나누어 기록한다.

### 5.5 부분 수정

검토 결과에 따라 전체를 다시 만들지 않고 문제가 있는 부분만 바꾼다.

수정 가능한 것:

- 영역 크기
- 여백과 간격
- 강조 정도
- 글자 크기 단계
- 정보 배치
- 읽는 순서

수정할 수 없는 것:

- 사용자의 원문
- 숫자와 단위
- 핵심 관계
- 승인된 의미 해석

## 6. 구현 순서

### 단계 0 — 기준 결과와 실패 조건 고정

현재 상태: **부분 완료**. failure fixture 3개, rough-but-readable 1개, intermediate fixture 1개와 실제 PNG 비교 구조는 고정했다. 사용자가 실제 이미지를 보고 명시적으로 승인한 `ready` Positive Fixture는 아직 없으므로 단계 0은 완료 처리하지 않는다.

- 기준 입력을 fixture로 고정한다.
- 기존 Balance 결과는 중간 품질 baseline으로 보존한다. 사용자가 명시적으로 승인하기 전에는 `ready` Golden Case로 등록하지 않는다.
- 현재 테스트를 기준선으로 남긴다.
- 좋은 결과와 실패 결과의 판단 항목을 테스트로 작성한다.
- 사람이 문제를 미리 표시한 Critic fixture 3~5개를 만든다.

최소 Critic fixture:

- 정보 위계가 잘못된 결과
- 정보가 지나치게 빽빽한 결과
- 읽는 순서가 불분명한 결과
- 문제가 없는 정상 결과

각 fixture에서 사람이 표시한 실제 문제와 Critic이 발견한 문제를 비교한다.

위 Critic fixture를 구현하고 검증하기 전에는 단계 0을 완료로 처리하지 않는다.

완료 기준:

- 기존 62개 테스트가 그대로 통과한다.
- 첫 V1 입력과 기대 관계가 고정되어 있다.
- Critic이 정상 결과를 무조건 실패로 처리하지 않는다.
- Critic이 문제 fixture의 핵심 문제를 하나 이상 발견한다.
- 사용자가 실제 이미지를 보고 승인한 `ready` Positive Fixture가 존재한다.
- `pnpm verify`가 실제로 PASS한다.

### 단계 1 — 입력에서 내용 구조 만들기

- 원문을 출처가 붙은 작은 항목으로 나눈다.
- 행동, 조건, 상태, 숫자, 결과, 순서를 정리한다.
- 명확한 정보는 일반 규칙으로 처리한다.
- 필요한 부분만 AI 해석 대상으로 표시한다.

완료 기준:

- 다섯 단계의 순서가 정확하다.
- `3`, `5초`, `+50%`가 원문과 연결된다.
- 새로운 수치나 문장이 생기지 않는다.

### 단계 2 — Information Plan 만들기

- 메커니즘 설명 구조를 선택한다.
- BREAK를 전환점으로 표시한다.
- 시간 정지 → BREAK → 받는 피해 +50%의 관계를 보존한다.
- 시각 스타일을 섞지 않고 설명 구조만 결정한다.

완료 기준:

- 원문 없이 Information Plan만 읽어도 설명 순서를 이해할 수 있다.
- 색상이나 좌표 같은 화면 정보가 들어 있지 않다.

### MEC-01 전용 scaffold boundary

`interpretMec01Source()`와 `createMec01InformationPlan()`은 V1 vertical-slice를 검증하기 위한 scaffold/fixture 코드다.

단계 3 이후 시스템은 `mec-01`, `break-state`, `damage-modifier` 같은 fixture-specific 이름이나 ID에 의존해서는 안 된다. 단계 3부터 Retrieval, Composition, Renderer는 반드시 범용 계약인 `SlideIR + InformationPlan`만 입력으로 사용한다.

MEC-01 전용 Retrieval, Composition, Renderer 경로는 만들지 않는다.

### 단계 3 — 필요한 규칙과 참고 자료 선택

- 현재 Reference Engine을 이용한다.
- 메커니즘, 인과관계, 중간 밀도에 맞는 자료만 가져온다.
- 관련성이 낮은 장기 기록은 전달하지 않는다.
- 전달량에 상한을 둔다.

완료 기준:

- 같은 입력은 같은 검색 결과를 낸다.
- 선택된 자료와 선택 이유를 확인할 수 있다.
- AI 호출별 token 사용량과 전달 자료 ID를 확인할 수 있다.
- 검색 결과와 context가 정해진 상한을 넘으면 호출 전에 중단된다.

### 단계 4 — 한 장 구성과 실제 렌더링

- Information Plan을 현재 Composition Engine에 연결한다.
- Composition Plan에는 배치와 강조만 기록한다.
- 현재 RenderTree와 Renderer로 실제 PNG를 만든다.
- 처음부터 여러 후보를 강제로 만들지 않는다.

완료 기준:

- 실제 16:9 결과 이미지가 생성된다.
- 모든 글자와 요소가 원문 항목으로 역추적된다.
- 고정된 5단계 전용 코드만으로 결과를 만들지 않는다.

### 단계 5 — Hard Gate

- 원문, 숫자, 관계, 누락, 넘침, 충돌을 한 번에 검사한다.
- 실패하면 디자인 검토 AI를 호출하지 않는다.
- 실패 이유를 항목별로 기록한다.

완료 기준:

- 숫자 변경, 내용 삭제, 강제 충돌 fixture가 각각 실패한다.
- 정상 fixture만 다음 단계로 넘어간다.

### 단계 6 — 실제 화면 디자인 검토

현재 상태: **부분 완료 · calibration 미완료**. 실제 PNG 입력, 작은 context, 구조화 결과, token·비용 trace와 targeted revision 연결은 검증됐다. 그러나 Ready Positive Fixture가 0개이므로 제출 품질 calibration은 완료할 수 없다. MEC-01과 Organization의 Stage 7 단일 revision cycle은 완료됐으며 다시 실행하지 않는다. Dodge Before/After artifact도 사용자 평가에서 `portfolio-not-ready / rejected-as-ready-candidate`로 판정됐으므로 Positive 확보나 단계 6 완료의 근거로 사용하지 않는다.

- 실제 PNG와 작은 구조 요약만 AI에 전달한다.
- 디자인 품질을 정해진 항목으로 평가한다.
- 문제 위치와 수정 범위를 구조화해서 받는다.

완료 기준:

- 원문 재작성 제안은 거부된다.
- 같은 문제에 대한 결과가 기록되고 비교 가능하다.
- 검토 결과가 Hard Gate를 통과시킬 권한은 갖지 않는다.

### 단계 7 — 최대 한 번의 부분 수정

현재 상태: **완료**. MEC-01과 Organization에서 최대 1회의 targeted revision cycle을 증명했다. MEC-01의 `f-relation-clarity-2`는 해결됐고 `f-space-use-1`은 미해결로 남았다. Organization 결과는 구조·원문·관계를 보존한 채 revision cycle을 닫았지만 사용자가 portfolio-ready가 아니라고 판정했다. 두 결과 모두 추가 자동 수정 또는 `ready` 강제 승격을 금지한다.

- 검토 결과 중 안전하게 적용할 수 있는 수정만 반영한다.
- 다시 렌더링하고 Hard Gate를 다시 실행한다.
- 두 번째 전체 재생성은 하지 않는다.

완료 기준:

- 수정 전후 결과를 비교할 수 있다.
- 원문과 숫자가 그대로 유지된다.
- 한 번 수정 후 반드시 사용자 판단 단계로 간다.

### 단계 8 — 사용자 승인과 선택 기록

현재 상태: **완료**. Organization best-known artifact에 대한 사용자 판단을 `rejected-as-ready`로 기록했다. 이 기록은 Teacher 평가나 Preference Event로 변환하지 않는다.

- 사용자는 승인 또는 거절할 수 있다.
- 선택 이유는 선택 사항이다.
- 제출 가능성 판단과 당시 artifact를 별도 readiness judgement로 저장한다.
- 상대적 취향 선택이 명시된 경우에만 별도 Preference Event를 만들 수 있으며, readiness 판단을 즉시 디자인 규칙으로 바꾸지 않는다.

완료 기준:

- 승인 또는 거절 판단을 저장할 수 있다.
- 어떤 내용과 어떤 구성에 대한 판단이었는지 나중에 확인할 수 있다.
- Teacher 품질, 사용자 취향, Ready 품질 상태가 서로 분리된다.

### 단계 9 — 출력 증거 생성

현재 상태: **완료**. `best-known / not-ready` Organization artifact를 출력 기능 검증 전용으로 사용해 네 형식을 생성했다. 이 출력 성공은 Ready Positive 승격 근거가 아니다.

사용자가 판단을 마친 한 장에서 다음을 생성한다.

- PNG 실제 렌더
- HTML 한 페이지
- PDF 한 페이지
- 편집 가능한 PPTX 한 장

PPTX는 내부 원본이 아니라 호환용 출력이다.

완료 기준:

- 네 출력이 아래 Output Parity 조건을 만족한다.
- PPTX의 텍스트를 PowerPoint에서 직접 수정할 수 있다.
- 이미지로만 붙인 PPTX는 편집 가능 결과로 인정하지 않는다.

#### Output Parity

다음은 모든 출력에서 반드시 같아야 한다.

- 문장
- 숫자
- 단위
- 정보 순서
- 중요한 관계
- 강조 대상

다음 차이는 허용한다.

- 렌더러 차이로 인한 미세한 줄바꿈 차이
- 렌더러 차이로 인한 미세한 간격 차이

HTML, PDF, PNG, PPTX가 픽셀 단위로 완전히 같을 필요는 없다.

## 7. 공통 검증과 완료 보고

모든 구현 단계의 완료 조건에는 `pnpm verify` 실행과 실제 PASS 결과가 포함된다.

작업 완료 보고에는 다음을 반드시 남긴다.

- 실행한 검증 명령
- 실제 PASS/FAIL 결과
- 테스트 파일과 테스트 개수
- 실패가 있었다면 원인과 해결 여부

GitHub CI는 이번 V1 작업의 필수 구현 대상이 아니다. 다만 추후 과제로 기록하고, 로컬 `pnpm verify`를 현재의 기준 검사로 사용한다.

## 8. V1에서 만들지 않는 것

- 전체 기획서 자동 생성
- 여러 장의 덱 자동 구성
- 강제 A/B 테스트
- 디자인 인터넷 자동 수집
- 야간 자동 학습
- 장기 Memory 자동 승격
- Local/OpenRouter/OpenAI/Anthropic 동시 구현
- 복잡한 모델 자동 선택
- UI 전면 재설계
- Balance 전용 경로 확장
- 여러 번 반복하는 자동 수정

## 9. AI 사용 방식

첫 구현에서는 다음 두 실행 방식만 사용한다.

1. 테스트용 가짜 AI
2. 실제 AI 한 종류

실제 AI는 역할별 작은 시험을 통과한 경우에만 사용한다.

비교 항목:

- 원문을 잘 보존하는가
- 정해진 결과 형식을 지키는가
- 한국어 게임 기획 내용을 이해하는가
- 실제 화면 문제를 찾는가
- 비용과 속도가 감당 가능한가

Local과 OpenRouter 중 무엇을 먼저 붙일지는 실제 시험 결과와 비용을 보고 결정한다. 특정 모델 이름을 프로그램 구조에 고정하지 않는다.

## 10. UI 적용 범위

현재 단계에서는 UI를 다시 디자인하지 않는다.

유지할 흐름:

```text
대시보드
→ 프로젝트
→ 기획서 작업 화면
```

테이블 디자이너에서 참고할 기능:

- 프로젝트 목록
- 최근 작업
- 자동 저장
- 복구 지점
- 휴지통
- 변경 전 사용자 승인
- 되돌리기

첫 Vertical Slice에서는 기존 Workbench에 다음 상태만 연결한다.

- 처리 중
- 의미 확인 필요
- 결과 준비됨
- 명확한 오류로 실패
- 사용자 승인
- 사용자 거절

내부 용어인 SlideIR, Information Plan, Harness, Model Router는 일반 사용자 화면에 표시하지 않는다.

## 11. 예상 코드 변경 범위

기존 package를 우선 수정한다.

- `contracts`
- `source-ingestion`
- `composition-engine`
- `reference-engine`
- `renderer`
- `preference-learning`
- `authoring-cli`
- `apps/workbench`

새 package는 실행 순서를 관리하는 `authoring-harness` 하나만 허용한다.

Balance 전용 `story-planner`, `html-exporter`는 기존 baseline 보호에 필요한 수정 외에는 확장하지 않는다. `pptx-exporter`는 기존 Balance 출력을 유지하면서 Stage 9의 범용 RenderTree 호환 출력만 최소 확장한다.

## 12. 전체 완료 조건

다음 조건을 모두 만족해야 첫 Vertical Slice가 끝난다.

1. 실제 게임 기획 원문이 SlideIR로 변환된다.
2. 원문과 모든 숫자가 결과까지 추적된다.
3. Information Plan과 Composition Plan의 책임이 분리된다.
4. 실제 16:9 결과 이미지가 생성된다.
5. Hard Gate가 의도적인 오류를 모두 잡는다.
6. AI Critic은 Hard Gate 통과 후에만 실행된다.
7. 수정은 최대 한 번이며 원문을 바꾸지 않는다.
8. 사용자가 승인하거나 거절할 수 있다.
9. 사용자 승인 또는 거절이 별도 readiness judgement로 저장된다.
10. PNG, HTML, PDF, 편집 가능한 PPTX 한 장이 Output Parity를 만족한다.
11. Balance baseline이 깨지지 않는다.
12. 기존 테스트와 신규 테스트가 모두 통과한다.
13. `pnpm verify`의 실제 PASS 결과가 완료 보고에 남아 있다.

## 13. 작업 중 중단하고 사용자에게 확인할 상황

다음 상황에서는 임의로 결정하지 않고 작업을 멈춘다.

- 원문이 두 가지 이상으로 해석되고 결과가 크게 달라지는 경우
- 사용자의 내용을 줄이거나 삭제해야만 배치할 수 있는 경우
- 유료 AI 사용이 필요한 경우
- 편집 가능한 PPTX와 화면 품질을 동시에 유지하기 어려운 경우
- 기존 Balance 결과가 깨지는 변경이 필요한 경우
- 테이블 디자이너 저장소와 실제 코드를 공유해야 하는 경우
- 계획에 없는 대규모 UI 변경이 필요한 경우

## 14. V1 종료 상태

V1은 입력부터 사용자 판단과 네 가지 출력까지 기능 흐름을 닫았다. Ready Positive Fixture는 아직 0개이므로 자동 디자인 품질이 완성됐다는 뜻은 아니다.

- 기능 흐름: 완료
- portfolio-quality generation: 미완료
- Organization best-known artifact: `best-known / not-ready`
- Ready Positive Fixture: 0개
- 다음 품질 작업: V1.1에서 별도 진행
