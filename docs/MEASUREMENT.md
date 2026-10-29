# 호스팅 생성 측정

> 호스팅 제작이 실제로 나아졌는지 숫자로 본다. 1단계(2026-10-29): 계측 보강과 읽기 전용 export.
> 아직 표본이 적다. 실제 호스팅 작업 몇 건으로 낸 비율은 방향만 보여 주고, 어떤 개선의 효과로 말하지 않는다.

## 무엇을 기록하나

| 출처 | 내용 |
|---|---|
| `af_generation_events` | `appearance-answer`(a/b 선택 또는 수정 요청), `motion-answer`(수정 요청한 클립), `register`, `cancelled`, `claimed`·`finished`(단계 시작·끝) |
| `versions` 이벤트(이번에 추가) | 워커가 단계를 시작할 때 보낸다: 킷 커밋(`kit`), 엔진 커밋(`engine`), 이미지·텍스트 모델. 읽지 못한 커밋은 `null` |
| `finished.calls`(이번에 채움) | 그 단계에서 og로 돈 명령별 `[실행 수, 실패 수, 초]`(`sprite gen`, `sprite video-set`, `codex` …). 12개 명령까지 이름을 남기고 나머지는 `other`로 합친다(이벤트 2000바이트 제한) |
| `af_decision_reviews` | 범위(design·look-a·look-b·walk·run)별 Decisions 리포트 |
| 호스트 장부(`og report --json`) | 실행마다 제공자, 걸린 시간, 칸 대기, 종료 코드, codex 세션 수. 작업 폴더 이름(`YYYYMMDD-gen-<id>`)으로 DB 작업과 잇는다 |

신청자의 글(요청·수정 메모·브리프·프로필)과 그림은 export에 들어가지 않는다.

## 숫자

| 숫자 | 뜻 |
|---|---|
| `appearanceFirstChoice` | 첫 외형 답이 수정이 아니라 선택인 비율(분모: 외형에 답한 작업) |
| `motionFirstAccept` | 첫 모션 미리보기 뒤 수정 없이 등록한 비율(분모: 첫 모션 미리보기에 답한 작업) |
| `clipRevisions` | 클립별 수정 요청 수와, 모션 미리보기까지 간 작업당 비율 |
| `revisionsPerRegistered` | 등록한 작업의 외형+모션 수정 횟수 |
| `failureOrReviewRate`, `failureCodes` | `failed`·`needs_review`로 끝난 비율과 그 코드 |
| `abandonRate` | 미리보기까지 간 작업 중 취소·만료된 비율 |
| `stageMinutes`, `claimsPerStage` | 단계별 기계 시간(claimed→finished)과 단계당 시도 수(재시도·임대 만료 포함) |
| `userWaitMinutes`, `minutesToRegister` | 미리보기에서 답(또는 취소)까지, 신청에서 등록까지 |
| `calls`, `providerRunsPerRegistered` | 명령별 실행·실패·시간, 등록 1건당 제공자 실행 수(장부가 있을 때) |
| `decisions` | 리뷰 수, 상태별·범위별 수, 입력 토큰 |

모든 숫자는 전체(`all`)와 킷 커밋별(`byKit`)로 나온다. `versions` 이벤트가 없던 작업은 `unknown`이다.

## 사용자 판정 라벨 (`clip-labels.jsonl`)

클립 단위의 약한 라벨이다. 모션 클립의 버전은 그 클립에 앞서 요청된 수정 횟수다.

- 수정 요청을 받은 버전은 `rejected`, 등록 시점의 버전은 `accepted`이다. 등록하지 않은 작업의 클립은 라벨이 없다.
- 외형 두 장을 모두 돌려보낸 회차는 둘 다 `rejected`, 고른 쪽은 `accepted`, 안 고른 쪽은 `not-chosen`(취향일 수 있어 결함으로 세지 않는다)이다.
- 그 버전을 본 Decisions 리뷰가 있으면 `review`(결함·clear·unverified 수)가 붙는다. 리뷰 시각 이전의 수정 횟수로 버전을 맞춘다.

`screening`은 "결함 있음"이 사용자의 반려와 얼마나 맞았는지(`detectionRate`)와 승인된 클립을 얼마나 막았을지(`falseBlockRate`)를 센다.
사용자는 결함 말고 취향으로도 돌려보내고, 작은 흠이 있어도 받아들인다. 그래서 이 값은 Decisions의 질문 단위 정확도가 아니고,
차단 규칙의 근거도 아니다. 질문 단위 평가는 독립 라벨과 `sprite-gen evaluate-decisions`로 한다(2단계).

## 뽑는 법

1. Supabase SQL 편집기(또는 psql)에서 [`scripts/measure-export.sql`](../scripts/measure-export.sql)을 실행하고, 결과 한 칸을 `db.json`으로 저장한다.
   기간은 SQL의 `w`에서 바꾼다(기본 30일). 편집기의 JSON 내려받기(`[{"export": …}]`)도 그대로 읽는다.
2. 호스트 장부(선택): `sudo -u oddbout-gen /srv/oddbout-gen/bin/og report --json > ledger.json`
3. `node scripts/measure-export.mjs --db db.json --ledger ledger.json --out-dir output/measure-YYYYMMDD`

`kpis.json`과 `clip-labels.jsonl`이 나온다. 스크립트는 어디에도 접속하지 않는다.

## 다음 단계

- 2단계: 수정 메모를 결함 유형(해부·정체성·루프·접지·스타일·기타)으로 태깅하는 시트, 질문 단위 독립 라벨 시트,
  라벨을 `sprite-gen-decision-eval` 데이터셋으로 바꾸는 빌더.
- 3단계: 주간 리포트, 판정 규칙을 차단으로 올리는 기준(test 분할의 검출률·오차단율).
