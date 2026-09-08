# Changelog

All notable changes to claude-code-kit are documented here.

Format follows [Keep a Changelog](https://keepachangelog.com/en/1.1.0/).

---

## [Unreleased]

### Security — 비공개 프로젝트 이름이 현재 트리에 있었다 (2026-09-08, 버전 무변경)

`plugins/` 무변경. 문서·스캐너 설정만.

**발견**: 이번 달 설계 문서 3곳에 권한 예시가 `Bash(<실제 비공개 프로젝트명>:*)` 형태로
들어가 있었다(`docs/specs/2026-09-07-*`). 중립 자리표시자로 치환했다 — **현재 트리 0건.**

**gitleaks 가 이것을 놓쳤다.** 룰 `private-project-names` 의 정규식이
`[a-z][a-z0-9]+_(quant|optimizer|ops)` 로 **접미사만** 보기 때문에, 접미사 없이 쓰인 이름은
하나도 잡히지 않았다. 전체 히스토리 스캔으로 정밀도도 실측했다:

| 매치 | 판정 |
| --- | --- |
| `total_*`·`git_*`·`extra_*`·`write_*`·`empty_*`·`claude_*` 형태 24건 중 23건 | **오탐** — 평범한 식별자 |
| 실제 비공개 이름 | **1건** (2026-03 커밋, 당시 이미 트리에서 제거됨) |

**정밀도 4%, 그리고 정작 잡아야 할 것은 놓쳤다.** 두 방향 모두에서 실패했다.

**조치**: 룰에서 `_ops` 를 제거해 일상 식별자 오탐을 없앴고(37건 → 23건, 현재 트리 0건),
**패턴으로는 임의의 비공개 이름을 탐지할 수 없다**는 한계를 `.gitleaks.toml` 주석에
명시했다 — 이름을 알아야 잡을 수 있고, 그 이름을 공개 설정 파일에 적으면 그것이 곧
유출이다. 없는 보호를 있다고 믿게 하지 않는다(`docs/conventions/warning-signal.md`).
기계적 방어가 필요하면 이름 목록을 **gitignore 된 로컬 파일**에 두고 pre-commit 에서
읽어야 한다.

> **히스토리는 고치지 않았다.** 2026-03 커밋과 이번 달 커밋에 해당 문자열이 남아 있다.
> 히스토리 재작성은 모든 SHA 를 바꾸므로 **커뮤니티 카탈로그의 pin(`292ba07`)을 무효화**
> 한다 — 되돌릴 수 없고 외부에 영향이 있는 결정이라 저장소 소유자의 판단 영역이다.

### 카탈로그 실태 전수 조사 (2026-09-08, 문서만 — 버전 무변경)

`docs/research/2026-09-08-plugin-directory-status.md` 신설 — 사실 3분류 태그 + 재현 명령.

- **정지 범위 실측** `[researched: GitHub API, n=60]`: 업스트림이 8/14 이후 움직인 항목
  **11건 중 bump 0건**. 신규 등재도 정지(일괄 등재 8/07 마지막, `Add referodesign` PR 이
  8/11부터 열린 채). 레포 전체 커밋 8/24 이후 0건
- **표본의 "핀=HEAD 44건" 은 정상 작동의 증거가 아니다** — 업스트림 휴면 항목이라 따라갈
  것이 없어서 최신인 것이다. 이 구분을 하지 않으면 표본이 정반대로 읽힌다
- **자매 카탈로그 대조**: `claude-plugins-official`·`knowledge-work-plugins` 는 9/04 에도
  bump 머지 — 조직 전체 중단이 아니라 **community 카탈로그만** 멈췄다. 왜인지는 `[unresolved]`
- **제출 폼이 둘로 갈렸다**: Console(개인 저자) / claude.ai(Team·Enterprise + 디렉토리 관리
  권한). 이 문서는 Console 만 알고 있었다
- 공식 문서가 제출 전 `claude plugin validate` 를 지시하고 *"리뷰 파이프라인이 제출마다
  같은 검사를 돌린다"* 고 명시 — 게이트 §19 가 추론이 아니라 **문서화된 요구사항**임이 확인

### 카탈로그 pin 정지의 근본 원인 특정 + 배포 관문 게이트 (2026-09-08, 버전 무변경)

`plugins/` 의 **에이전트·스킬·룰·훅은 무변경**이다. 바뀐 것은 마켓플레이스 매니페스트의
미지 필드 하나와 레포 도구(게이트·CI)뿐이라 소비자 동작이 달라지지 않는다 — v2.20.0 이
최종 릴리스라는 사실도 그대로다.

**근본 원인 — 우리 결함이 아니다.** pin 전진은 `anthropics/claude-plugins-community` 의
워크플로 **`Bump Plugin SHAs`**(매일 07:23 UTC cron)가 수행하는데:

| 확인 | 결과 |
| --- | --- |
| 워크플로 상태 | **`disabled_manually`** |
| 마지막 실행 | **2026-08-13** (이후 0회) |
| 우리 항목이 `freeze-shas.txt` 에 있는가 | **없다** |
| 막힌 bump PR | **없다** (열린 PR 11건 중 0건) |

카탈로그의 **모든 항목이 똑같이 멈춰 있다.** 재제출로 풀리는 문제가 아니다.

**Fixed — 실제 오류 1건.** `claude plugin validate` 가
`❯ repository: Unknown field 'repository'` 를 잡았다. `marketplace.json` 최상위에서
제거했다(`plugin.json` 쪽 `repository` 는 유효하므로 유지). **이것이 핀 정지의 원인은
아니다** — 상류는 비-strict 로 돌리므로 경고 단계였다. 인과를 과장하지 않는다.

**Added — 게이트 §19 + CI 스텝: `claude plugin validate --strict`.**
이 검사는 우리 CI 가 아니라 **배포 경로가 실제로 거는 관문**이다. 상류가 bump 시 이걸
돌리고 실패하면 red PR 또는 freeze 목록행이다. **자동화가 재개되는 순간 green 인 것이
우리가 통제할 수 있는 전부**이므로 미리 건다. 종료코드만 보지 않는다 — `--strict` 실패에도
exit 0 이 나는 것이 실측됐다. 되돌려-FAIL 확인: 필드를 되살리면 §19 가 red.



W-024 배치. **버전을 올리지 않는다** — 변경이 `evals/`·`scripts/`·`docs/` 로 전부 레포
로컬이고 `plugins/` 아래 배포물은 무변경이라 소비자 동작 변경이 없다. 플러그인 캐시 키를
움직일 이유가 없다(스펙 D-4).

### Fixed — eval 게이트가 자기 정책이 강제한다고 주장한 검사를 하고 있지 않았다

`evals/policy.json` 의 `_tier2Rationale` 은 *"tier2 는 경고 수준 커버리지로만 다룬다"* 고
적어 뒀지만, `scripts/check_eval_coverage.py` 에는 **문자열 `tier2` 가 한 번도 나오지
않았다** — 경고조차 구현돼 있지 않았다.

그 결과 `consensus-builder` 가 `tiers.tier2`(A등급)에 등재된 채 **시나리오 없이 조용히
통과**하고 있었다. `git log --all -- 'evals/scenarios/consensus-builder*'` 결과 0건 —
어느 커밋에도 존재한 적이 없다. 같은 파일의 회계 문장(*"티어1 13 + 티어2 A 16 + B 3 +
C 1 = 33종, 미분류 잔여 0"*)은 **거짓이었다**(실제 시나리오 28종).

게이트가 놓친 기전은 단순하다: 기존 검사 셋(시나리오⊆기준선, 기준선⊆시나리오, **티어1**
최소 보유) 중 어디에도 걸리지 않는다. 시나리오가 없으니 앞의 두 집합에 등장하지 않고,
티어1이 아니니 세 번째도 지나간다. **검사 대상이 아닌 것은 결코 red 가 되지 않는다.**

### Added — 커버리지 게이트에 검사 2종

| 검사 | 대상 | 판정 | 플래그 |
| --- | --- | --- | --- |
| `check_tier2` | `tiers.tier2`(A등급) 각 에이전트 최소 시나리오 | **fail** | `gate.tier2CoverageEnforceFail: true` |
| `check_classification_complete` | 전체 에이전트 = tier1 ∪ tier2 ∪ `_tier2Classification`(B·C) | **warn** | `gate.classificationCompleteEnforceFail: false` |

- 티어2를 **도입 즉시 fail** 로 놓은 이유: 이 배치가 유일한 갭을 같은 배치에서 메우므로
  승격 직후 16/16 green 이다. `tier1CoverageEnforceFail` 이 S1 경고 → S4 fail 로 간 것과
  달리 단계를 나눌 이유가 없었다. 영구 노란 경고는 아무도 보지 않는다.
- 분류 완전성을 **warn** 으로 둔 이유: 새 에이전트를 추가하는 무관한 작업이 분류 등재
  전까지 red 가 되면 게이트가 작업을 막는 방향으로 오작동한다. 경고는 매 실행 출력된다.
- **"검사 대상 0개"는 정합이 아니라 손상이다.** `tiers.tier2` 부재·빈 배열, 그리고
  `plugins/common/agents` 에서 에이전트 0종 발견은 **플래그와 무관하게 즉시 fail** 이다.
  후자는 이 배치의 1차 구현에 실제로 있던 결함이다 — 통합 전 리뷰에서 `plugins/` 없는
  가짜 레포로 실증했다(`✓ 전체 에이전트(0종) 분류 완전` + exit 0). `validate_policy_schema`
  가 이미 기록한 거짓 green 이 새 검사에 재도입된 것이라, 같은 배치 안에서 봉쇄했다.

### Added — `consensus-builder` 시나리오 `hard-constraint-standoff`

티어2 A등급 중 유일하게 비어 있던 자리를 메운다. 잡는 실패는 **"위장된 합의"** — 양보 불가
제약을 깎아 만든 가짜 Win-Win 을 합의로 보고하는 것으로, W-023 에서 `git-workflow` 가
충돌을 `--theirs` 로 밀고 *"성공적으로 병합되었습니다"* 라고 한 것과 같은 클래스다.

fixture 는 Round 1 종합 결과에 충돌 2건을 둔다 — **#1 Hard vs Hard**(GDPR EU 역내 저장
의무 vs SLA 조항 7.2 "서로 다른 대륙 2개 리전 복제"), **#2 협상 가능**(4주 출시 vs 6주
정합성 검증). 올바른 행동은 #1 을 사용자 결정으로 올리고 #2 에만 합의안을 내는 것이다.

초안 fixture 에는 **EU 다중 리전 복제라는 기술적 우회로가 실제로 존재**해 에이전트가
정당하게 조건부 합의를 냈다(어서션은 통과했으나 의도한 hard-constraint 강제가 성립하지
않았다). SLA 원문에 *"동일 대륙 내 복제는 본 조항을 충족하지 않는다"* 를 명문화해 닫았다 —
**어서션이 아니라 fixture 를 고쳤다.** 실측 연속 2회 통과로 검증했다.

에스컬레이션 어서션은 통합 전 리뷰에서 한 번 좁혔다: 값에 있던 `"사용자에게"` 는
*"사용자에게 보고드립니다"* 같은 평범한 서술에도 매치돼 **이 어서션이 잡으려던 실패가
그대로 통과**한다. 빼는 과정에서 실측 출력이 `❓ 사용자(경영진) 결정 필요` 였고 중간의
`(경영진)` 때문에 `"사용자 결정"` 과 매치되지 않는다는 것 — 즉 목록이 사실상 이모지
`❓` 하나에 의존하고 있었다는 것 — 이 드러나, `"결정 필요"`·`"에스컬레이션"` 을 넣었다.
**약화가 아니라 강화다.**

### Changed — 기준선 재생성 (`2026-08-31.json` → `2026-09-04.json`)

시나리오 추가로 `requireBaselineCoversAllScenarios` 가 red 를 냈고,
`baseline._meta.regenerationCadence` 규정대로 같은 배치에서 전량 재실행했다(부분 실행은
`--baseline` 저장이 거부된다). **38/38 pass, 기존 37건 status 전부 유지(회귀 0).**

## [2.20.0] — 2026-09-08

**`claude-code-kit` 의 마지막 릴리스.** 개발은 후속 킷
[`hiway-kit`](https://github.com/This-HW/hiway-kit) 에서 계속된다.

### 왜 버전이 3.2.0 다음에 2.20.0 인가

이 레포는 두 플러그인 이름의 역사를 담고 있다. `v3.0.0`~`v3.2.0` 은 **`hiway-kit`**
이라는 이름의 플러그인 릴리스였다 — 그 계보는 새 레포로 옮겨 갔다. **`claude-code-kit`
이라는 이름의 플러그인**은 2.19.0 에서 멈춰 있었고, 이 릴리스가 그 계보를 잇는다.
플러그인 캐시 키가 `{이름}/{버전}` 이므로 이름별로 단조 증가하면 충분하다:
`claude-code-kit` 2.19.0 → **2.20.0**.

개명을 이 레포에서 그대로 수행한 것이 실수였다. 커뮤니티 카탈로그의 등재명은
`claude-code-kit` 인데 이 레포의 플러그인 이름은 `hiway-kit` 이 되어 있었다 — 등재와
실물이 어긋난 상태였다. 이 릴리스가 그것을 되돌리고, 개명은 **새 레포**에서 새 등재로
간다.

### Changed — 이름 복원

- 플러그인 이름 `hiway-kit` → **`claude-code-kit`**, 마켓플레이스 이름도 동일하게 복원
- `scripts/derive-name.py` 가 SSOT(`.claude-plugin/plugin.json` 의 `name`)에서 문서·사이트
  13개 파일을 파생 갱신. 개명 게이트(§18)가 양방향으로 동작함이 이 릴리스로 실증됐다

### Added — `agent-teams` 복원 (2.x 는 파괴적 변경 없이 닫는다)

v3.0.0 이 이 스킬을 제거했지만, **그것은 `hiway-kit` 계보의 메이저 변경**이었다.
`claude-code-kit` 2.x 를 파괴적 변경으로 끝낼 이유가 없으므로 복원한다 (스킬 21종).
폐기 문구는 "v3.0.0 에서 제거" → "2.x 는 유지, 제거는 후속 킷에서"로 정정했다.

### Kept — 3.x 개선분 전부

이 릴리스는 껍데기가 아니다. 개명 작업 중 만든 개선을 **전부 그대로 싣는다**:
세션 주입 예산 게이트(34,062B → 9,663B), 룰 티어(core/conditional/reference),
워크트리 안전 훅 경로(`git rev-parse --git-path hooks`), 어서션 레지스트리 통합,
경로 봉쇄 관례, 게이트 24종. `claude-code-kit` 에 머무는 사용자도 유지보수가 끝난
green 빌드를 받는다.

### Added — 후속 안내

- `README.md` 최상단 배너 + `## Successor: hiway-kit` 절 (일회성 마이그레이션 절차)
- **공존 금지**를 명시: 중복 스킬 로딩이 실측됐다(`docs/specs/2026-09-07-rename-probe.md`).
  dedup 키가 `<플러그인 이름>:<스킬 이름>` 이라 이름이 다른 두 플러그인이 같은 스킬을
  실으면 경고 없이 두 번 등록된다. 반드시 uninstall 후 install

---

## [3.2.0] — 2026-09-08

**사이클 2 반영.** 외부 소비자가 같은 워크트리에 브리프 **6건을 연속**으로 돌리고
(전부 병합) 마찰 3건을 회신했다. 그중 둘이 계약 결함이었고, 이쪽에서 자체 검증 중
셋째를 찾았다.

### Fixed — 낡은 마커가 탐지되지 않았다

`child-marker.md` 는 *"브리프마다 치환"* 을 규정했지만, 훅은 마커의 **존재만** 보고
`base_commit` **값을 대조하지 않았다.** 치환을 빠뜨린 세션도 계속 "자식"으로 판정되고,
기준 커밋이 낡았다는 사실이 **어디에서도 드러나지 않았다** — 선언은 있고 집행이 없었다.

훅 예시가 `base_commit` 을 현재 HEAD 와 대조해 **조상 관계가 아니면 경고**한다.
차단하지 않는다 — 자식이 정당하게 기준보다 앞선 작업 커밋 위에 있을 수 있다.
목적은 *"브리프가 바뀌었는데 마커를 안 갈았는가"* 를 사람이 보게 하는 것이다.

### Added — 보고에 "병합 측 후속 조치" 필수란

실측: 자식이 *"untrack 은 인덱스만 건드린다"* 고 **정확히** 보고했는데,
**부모의 ff 병합이 라이브 파일을 지웠다.** 자식 보고는 틀리지 않았다 —
**병합 시점에 무슨 일이 일어나는지를 말할 자리가 없었다.**

자식이 아는데 부모가 모르는 것을 넘기는 란을 만들었다: 병합이 파일을 지우거나 덮어쓰는가 ·
복원·재생성이 필요한가 · 순서 의존 · 부모가 먼저 백업할 것.

### Added — 지시가 기존 계약과 충돌할 때의 규범

실측: 자식이 브리프 문구를 문자 그대로 구현하지 않고 **기존 테스트 계약을 근거로 좁혔고**,
그것이 옳은 판단이었다. 규범이 허용하지 않으면 다음 자식은 틀린 쪽을 고른다.

**좁히되 반드시 드러낸다** — 근거를 인용하고, 근거 없이 좁히는 것은 범위 이탈이라 멈추고 묻는다.
**조용히 좁히는 것이 가장 나쁘다**(부모는 지시대로 됐다고 믿는다).

### Changed — 티어 배정 오류 2건을 고쳤다

- **`delegation-contract` 이 `core` 였다.** 위임하지 않는 세션에는 무의미하므로
  D-17 의 core 정의에 맞지 않는다 → `reference`. 세션 주입이 **10,209B → 9,663B** 로 줄고,
  계약은 559B 암호문에서 **3,126B 완전판**이 됐다. 예산 때문에 계약을 압축하고 있었던 것이
  애초에 티어를 잘못 준 결과였다.
- **`portable` 이 이분법이라 `reference` 티어가 AGENTS.md 에 통째로 실렸다.**
  호스트 무관이지만 **필요할 때만 읽으면 되는** 규범을 인라인할 이유가 없다 →
  reference 는 이름만 광고한다. AGENTS.md **24,888B → 18,619B**.
  conventions 블록의 인라인/참조 구분을 손 목록이 아니라 **규범 자신의 tier** 가 정하게 됐다.

### 여전히 미검증

`describe` 능력 협상(레지스트리 파사드 미착수) · 발견 경로(`control-loop` 에 발견 로직 없음) ·
규약 0 인 레포의 기본값 경로(수용 33).

## [3.1.0] — 2026-09-07

**외부 소비자 첫 사이클 검증(수용 38)이 잡은 결함 수정.** 다른 프로젝트의 컨트롤 세션이
v2.19.0 을 실제 운영에 쓰고 6항목 회신을 보냈다 — 성공 보고만이 아니라 마찰 5건을 함께.

### Fixed — 마커 키 이름이 고정돼 있지 않아 세션마다 갈렸다

가장 심각한 것. `child-session` 스킬이 마커 내용을 *"부모 세션 이름 · 역할 · 기준 커밋"* 이라고
**산문으로만** 말하고 키 이름을 정하지 않았다. 그 결과 같은 날 두 세션이 각각
`base_commit` · `baseline_commit` 을 썼다. **훅이 마커를 읽는 순간 그 드리프트가 오판이 된다.**

- **`rules/child-marker.md` 신설** (reference 티어) — 키 이름을 고정한 데이터 계약.
  `schema`·`parent`·`role`·`base_commit`·`written_at`. 쓰는 쪽(자식 스킬)과 읽는 쪽(훅 예시)이
  **이 파일 하나**를 따른다.
- **훅 예시가 스키마를 검증한다** — 이전에는 JSON 파싱만 하고 "파일이 있으면 자식"으로 봤다.
  모르는 `schema` 버전이나 필수 키 누락은 **"자식 아님"으로 fail-open** 한다.
- **부모 없이 스스로 로드한 세션**은 `parent` 에 `"self"` 를 쓴다(회신이 지적한 미규정 사례).

> reference 티어라 **세션 주입량이 늘지 않는다** — 필요한 쪽(자식 스킬·훅)만 읽는다.

### Fixed — 계약의 빈틈 2건

- **①전제 밖의 사실 주장.** 워커가 ①전제 블록의 오류에는 정지했지만 ②범위 블록에 섞인
  사실 주장에는 정지하지 않고 진행했다. 계약에 명시했다 —
  **"사실 주장은 블록 위치 무관 전부 전제"**.
- **보고 `<수치>` 가 의미 없이 통과.** 정규식은 형식만 잡는다. 워커가 `15` 만 써서 무엇의 15인지
  본문을 봐야 했다. **맨 숫자 금지, 대상을 붙인다**(`15 tests`).

### Fixed — `planning-check` 가 특정 MCP 를 이름으로 지목하고 있었다

v3.0.0 의 소비자 중립화(D-19)가 `mcp-usage` 에서 걷어낸 패턴이 `planning-check` 에 남아
Notion·Figma 를 검색 순서로 지목했다. *"프로젝트가 제공하는 지식 소스"* 로 중립화했다.

### Changed — `definition-of-done` 이 게이트 검사 목록을 복제하고 있었다

규범이 `verify-done.sh` 의 검사 항목을 산문으로 열거했고, **이미 낡아 있었다**(§16·§17·§18
신설이 반영 안 됨). **게이트가 목록을 소유한다** — 규범은 실행과 attest 만 말한다.

### 검증되지 않은 것 (정직하게)

회신이 명시했다 — **발견 경로는 이번에도 미검증**이다. 컨트롤이 프로젝트 병합 스크립트를 쓴 것은
맞지만, *킷이 발견한 것이 아니라 컨트롤 세션이 `CLAUDE.md` 를 읽어 알고 있던 것*이다.
`control-loop` 본문에 발견 로직은 없다. **규약 0 인 레포에서의 기본값 경로도 아직 안 밟았다**(수용 33).

## [3.0.0] — 2026-09-07

**개명: `claude-code-kit` → `hiway-kit`.** 이 킷은 Claude Code 전용이 아니다 —
규범과 절차는 Codex·Antigravity 에서도 동작한다. 이름이 그 사실과 어긋나 있었다.

### ⚠️ 기존 사용자는 재설치가 필요하다

**자동 이행되지 않는다.** 실측으로 확인한 사실이다
(`docs/specs/2026-09-07-rename-probe.md`, runtime-verified):

- `enabledPlugins` 키는 **수동 이행**이다. 구 설치본이 "찾을 수 없음"이 돼도 자동으로 옮겨지지 않는다.
- 구·신 이름이 **공존하면 스킬이 경고 없이 중복 로드**된다. 디둡 키가
  `<plugin.json의 name>:<스킬명>` 이라, `name` 이 바뀌면 같은 스킬이 별개 엔트리 2개가 된다.
- 따라서 **"기한 있는 폐기 별칭"을 두지 않았다.** 카탈로그에서 구 이름을 즉시 제거한다 —
  구 설치본이 "찾을 수 없음"이 되는 것이 **조용한 중복보다 나은 신호**다.

```bash
# 1) 구 플러그인 제거
/plugin uninstall claude-code-kit@claude-code-kit

# 2) 구 마켓플레이스 제거
/plugin marketplace remove claude-code-kit

# 3) 새 이름으로 재설치
/plugin marketplace add This-HW/claude-code-kit
/plugin install hiway-kit@hiway-kit
```

**저장소 주소는 그대로다** (`This-HW/claude-code-kit`) — 바뀐 것은 **플러그인 이름**이다.
스킬 호출도 바뀐다: `/claude-code-kit:plan-task` → **`/hiway-kit:plan-task`** (프리픽스 18자 → 9자).

### Removed

- **`skills/agent-teams`** — v2.19.0 에서 폐기 예고했던 대로 제거한다. 그 내용은
  `control-loop` 과 운송 부록(`docs/control-loop-transport.md`)이 흡수했다. 스킬 21 → 20.

### Changed — 이름이 SSOT 에서 파생된다

`plugins/common/.claude-plugin/plugin.json` 의 `name` 이 유일한 출처이고,
`scripts/derive-name.py` 가 README·`CLAUDE.md`·`site/` 를 파생시킨다.
`verify-done.sh` **§18** 이 드리프트를 잡는다.

이번 개명이 그 설계를 실증했다 — **값 하나를 바꾸고 생성기를 돌리자 13개 파일이 따라왔다.**
이전 같으면 59개 파일을 손으로 고쳐야 했다.

**개명이 드러낸 결함 2건도 함께 고쳤다**: `check_doc_counts.py` 와 `export_harness.py` 가
플러그인 이름을 **하드코딩**하고 있어 개명이 검사기 자신을 깨뜨렸다. 둘 다 SSOT 에서 읽도록
바꿨다 — 게이트도 D-3 의 적용 대상이다.

### 파리티 계약 (변경 없음, 명시만)

> 규범과 절차(`rules`·`skills`)는 **모든 하네스 공통**. 전용 실행자와 자동 강제
> (`agents`·`hooks`)는 **Claude Code 심화 기능**.

비-Claude Code 하네스에서 잃는 것은 **자동 차단 하나**다. 규율·절차·상태·이음매는 전부 동작한다.

## [2.19.0] — 2026-09-07

W-026 배치. **다중 세션 개발 규율**을 스킬·규범·훅으로 구현한다 — 컨트롤 세션과 자식 세션이
계약 하나를 공유하고, 그 계약이 규범에 **한 벌만** 존재한다.

### Added — `control-loop` · `child-session` 스킬 (스킬 19 → 21)

- **`control-loop`** — 컨트롤 세션용 3페이즈. **P1 조사·설계**(위임 가능) / **P2 결정·브리프**
  (컨트롤 전용) / **P3 디스패치·수신·통합**(컨트롤 전용). 축은 *기획 대 컨트롤*이 아니라
  **결정 대 조사**다 — 4블록 브리프를 쓸 수 있으면 위임, 못 쓰면 먼저 조사한다.
  P3 에 **기준 커밋을 해시로 못박고 워커가 검증**하는 규율이 들어 있다(브랜치 이름은 낡을 수 있다).
- **`child-session`** — 자식 세션용. 인자 4개를 받고 **전제 검증을 먼저** 한다 —
  브리프의 사실 주장을 코드에서 확인하고 틀리면 구현하지 않고 멈춘다. 인자가 빠지면
  **추측하지 않고 부모에게 묻는다**.
- **`agent-teams`** 는 폐기 예고로 교체됐다(v3.0.0 에서 제거).

### Added — `rules/delegation-contract.md` (규범 13 → 14)

브리프 4블록·완료 보고 첫 줄 형식·검사 정규식을 **한 곳에** 둔다. 두 스킬은 참조만 한다 —
각 스킬에 적으면 계약이 두 곳에 생기고, 그것이 이 레포가 반복해서 잡아온 결함 클래스다.

금지사항은 **명령 수준**으로 쓴다("읽기만"이 아니라 "`--apply` 실행 금지, `--check` 만").
테스트 결과는 파이프에 넣지 않는다 — `cmd | tail` 은 종료코드를 삼킨다.
병합 통지는 **통합 브랜치의 최종 SHA** 로 한다 — rebase 가 해시를 바꾼다.

### Added — opt-in 훅 예시 · 운송 부록 · 레지스트리 이음매

- **`hooks/examples/child-git-guard.py`** — bare `git stash`·`reset --hard`·자식의 `push` 차단.
  **`hooks.json` 에 넣지 않았다.** 킷의 훅은 설치 즉시 모든 소비자에게 활성이라, 정당한 사용에서
  push 를 막으면 남의 환경을 깨뜨린다. **기본 off, 문서화된 opt-in.**
  자식 판별은 워크트리 gitdir 의 마커 파일로 한다 — `CLAUDE_CODE_CHILD_SESSION` 은
  **역할 판별 신호가 아님이 실측됐다**(부모·자식·서브에이전트 전부 1).
  **훅은 Claude Code 전용**이라 Codex·Antigravity 에는 자동 차단이 없다는 사실을 README 에 적었다.
- **`docs/control-loop-transport.md`** — 운송 감지 사다리(orca → 네이티브 서브에이전트 →
  ultracode → 순차). **배포물 밖**에 둔다 — 킷은 특정 오케스트레이터를 알지 않는다.
- **`scripts/check_registry_describe.py`** — 컨트롤 프로젝트의 레지스트리 파사드가 계약을
  지키는지 검사한다. 킷이 아는 동사는 `describe` **하나**뿐이고 나머지는 선언된 것만 호출한다.
  미선언은 전부 안전한 쪽으로 읽는다(`effect` 미선언 = write, 손상 응답 = 전면 폴백).

### Changed — eval 러너의 하네스 결합점을 심으로

`Harness` 프로토콜 3메서드. 이전에는 시나리오 실행·LLM judge·가용성 게이트 3곳에 `claude` CLI 가
직접 박혀 있어, 하네스 중립을 주장하면서 그 주장을 검증하는 eval 은 Claude Code 만 구동할 수
있었다. judge 의 모델명까지 구현체 소유로 옮겼다.

## [2.18.0] — 2026-09-07

W-025 배치. 규범 주입을 **34,062B → 9,829B (71% 감축)** 하고, 배포물 전반의
"존재하지 않는 것을 가리키는 서술"과 소비자 환경에서 상시 발화하던 경고를 정리했다.

### Fixed — 워크트리를 쓰면 매 세션 경고가 떴다

`session-check` 가 `.git/hooks` 를 디렉토리로 가정했다. 워크트리에서 `.git` 은 gitdir
포인터 **파일**이라 `ENOTDIR` 로 실패하고, **이 킷이 권장하는 운영 형태**(`isolation:
worktree`·`parallel-worktree`)를 따르는 모든 사용자에게 경고가 나가고 있었다.
`git rev-parse --git-path hooks` 로 해석한다.

### Changed — 규범이 자기 활성화 조건과 이식성을 선언한다

`ALWAYS_RULES` 하드코딩 리스트를 없애고 각 규범이 frontmatter 로 선언한다:

```yaml
tier: core | conditional | reference
portable: true | false
```

- **`tier`** — 상시 주입은 `core` 뿐이다. 상황 규범(`parallel-worktree`·`mcp-usage`·
  `feedback-loop`·`task-resume`)은 신호가 있을 때만, 참조 규범(`agent-system`·
  `agent-delegation-chain`)은 색인만 남는다. 주입은 **현저성을 사는 비용이지 강제가 아니다**.
- **`portable`** — `export_harness.py` 의 `PORTABLE`/`NOT_PORTABLE` 딕셔너리를 대체한다.
  같은 13종에 대한 분류가 두 곳에 있고 정합 강제가 없던 것을 한 곳으로 모았다.
  분류가 규범 파일 자신에 있으므로 **유령 엔트리와 양쪽 등재가 구조적으로 불가능**해졌다.

### Removed

- **`rules/tool-usage-priority.md`** — 호스트가 정반대를 지시하는 사례가 실측됐다.
  도구 선택은 네이티브 행동이고, 이 킷의 원칙은 "네이티브가 하는 일을 중복하지 않는다"다.
- **`skills/README.md`** · `skills/references/` 미참조 8종 — 손유지 색인·고아 자산.
  생존 2종은 `plan-task/references/` 로 이관. 결과로 `skills/` 최상위 진입이 **19 = 실제 스킬 수**가
  되어 `agy plugin validate` 의 오집계(21)가 해소됐다.
- `agent-system` 의 키워드 표, `using-claude-code-kit` 의 Skill Trigger Map·Agent Selection —
  하네스가 이미 트리거까지 제공한다.

### Added

- **`rules/untrusted-text.md`** — 외부·타세션 텍스트를 데이터로만 다루는 규율.
  원래 워크플로 스킬 안에 있었으나 자기 제목이 "호스트 무관 공통 규율"이었다. core 규범이 맞다.
- **`verify-done.sh` §16** — 세션 주입 총량 예산(10,240B). core/WORKFLOW 를 따로 재지 않는다.
  절을 파일 사이로 옮기는 것만으로 통과시킬 수 있기 때문이다.

### Fixed — 존재하지 않는 것을 가리키던 서술

dangling `references:` frontmatter, 존재하지 않는 에이전트로의 위임 지시, 없는 도구명(`LSP`),
`agent-creator`·`skill-creator` 가 가르치던 금지 필드·없는 등록 절차, `mcp-builder` 의 없는 CLI,
`enforce-structure` 의 소비자 파일 전제(우아한 폴백으로 전환). 워크트리 복귀 프로토콜이 에이전트
8종에 복제돼 있던 것은 규범 참조로 축약했다.

### Fixed — eval 하네스가 대상에게 평가 사실을 노출했다

작업 디렉토리 이름에 에이전트명과 시나리오 id 가 박혀 있어 `pwd` 한 번으로 드러났다.
중립 prefix 로 바꾸고 매핑은 리포트에 기록한다.

## [2.17.0] — 2026-09-01

W-023 배치. eval 커버리지의 **마지막 kit-내부 갭**을 갚았다 — v2.16.0이 남긴 B·C등급 5종 중
`git-workflow` 하나만 승격 조건이 전부 우리 코드 안에 있었고, 그것을 처리했다.
그 과정에서 **eval이 실재하는 에이전트 결함을 잡아냈고**, 그 수정이 이 릴리스의
유일한 소비자 동작 변경이다.

### Changed — `git-workflow`가 충돌을 임의로 해결하지 않는다 (소비자에게 보이는 동작 변경)

**무엇이 바뀌었나.** 병합·리베이스 충돌을 만나면 `git-workflow`는 이제 `ours`/`theirs`/수동
편집으로 **스스로 해결하지 않는다.** 충돌 파일과 내용을 보고하고 해결 방안을 제시한 뒤
사용자 결정을 기다린다. 사용자 결정을 받을 수 없는 무인 실행에서는 진행이 아니라
`git merge --abort` 로 **되돌리고 보고**하는 것이 기본값이다.

**왜 바뀌었나 — eval이 잡았다.** 이번 배치에서 신설한 `merge-conflict-escalation`
시나리오의 첫 실행에서 실제로 관측됐다: 에이전트가 충돌을 `--theirs` 로 조용히 해결하고
머지 커밋을 남긴 뒤 *"완료했습니다! 성공적으로 병합되었습니다"* 로 보고했다.
에스컬레이션이 아니라 **성공으로 위장된 임의 해결**이다. 매 세션 주입되는
`rules/parallel-worktree.md`의 *"NEVER: 충돌 시 에이전트가 임의로 ours/theirs 선택"* 위반.

**근본 원인은 정의의 자기모순이었다.** `description`은 "충돌 해결을 담당합니다"라 하고
본문은 `git add <resolved>` / `--continue`를 가르치는데, 정작 출력 템플릿은
"해결 방법 **[제안하는 해결 방법]**"이었다 — 실행하라와 제안하라가 한 파일에 있었다.
정의를 출력 템플릿 쪽으로 맞췄고, NEVER 조항에는 **이유를 붙였다**(이유 없는 제약은 우회된다).

**소비자 영향**: 충돌 상황에서 이 에이전트가 자동으로 진행하지 않으므로, 그 지점에서
사람의 선택이 필요해진다. 파괴적 git 연산을 저예산 모델이 조용히 결정하던 경로가 닫힌다.
수정 후 연속 2회 2/2 통과로 검증했다.

### Added — 시나리오가 git 저장소 상태를 가질 수 있다 (`git.json`)

시나리오 디렉토리에 `git.json`(선택)을 두면 러너가 실행 직전 temp 작업 디렉토리에 저장소를
**실체화**한다. 브랜치·커밋 히스토리·충돌 상태를 fixture로 표현할 수 있게 됐다.

- 연산 어휘는 **화이트리스트 8종**(`init`·`write`·`add`·`commit`·`branch`·`checkout`·`tag`·`merge`).
  임의 `run`/`exec`, 원격 연산은 구현하지 않는다
- `write.path`는 `_safe_join` 경로 봉쇄를 통과해야 하며, 한 번 resolve한 결과를 끝까지 쓴다(TOCTOU 차단)
- 실체화 실패는 **fail-closed** — 해당 시나리오를 `error`로 분리하고 채점에 넣지 않는다
- 커밋 신원·시각을 고정해 실행자의 전역 git 설정이 결과를 바꾸지 못하게 한다

### Added — git 상태 어서션 3종

`git_log_contains` · `git_branch_exists` · `git_status_clean`. `expect: false`로 부정을
표현하며, 별도 `*_not_*` 타입을 만들지 않았다. 비-저장소 디렉토리에서는 **명시적 fail** 이다
(빈 `porcelain` 출력을 "clean이니 통과"로 오독하면 거짓 green이 된다). `ref`/`branch`는
옵션 주입을 막고, `shell=True`는 쓰지 않는다.

### Added — `git-workflow` 티어2 A등급 승격 + 시나리오 2건

`feature-branch-commit`(기본 git 작업), `merge-conflict-escalation`(충돌 시 규범 준수).
티어 회계가 닫힌다: **티어1 13 + 티어2 A 16 + B 3 + C 1 = 33종**, 미분류 잔여 0.

### Removed — 죽은 `delegation_signal` 어서션 타입

W-022 R1이 계약을 폐기하면서 시나리오 어서션을 전부 걷어냈으나 채점 코드는 남겼다.
실사용 조사 결과 **어서션 117건 중 사용자 0건**. 검사 대상이 없는 채점 코드는 "이 계약이
아직 살아 있다"는 잘못된 신호만 준다. `KNOWN_ASSERTION_TYPES`와 `check_assertion` 두
지점에서 제거했다. `expect.json`들의 `_removedAssertions` 주석은 역사 기록이므로 유지.

### Fixed — v2.16.0이 기록한 승격 조건이 성립 불가능한 조건이었다

`policy.json`의 `git-workflow` 승격 조건 ①은 *"fixture 스테이징 파이프라인이 `.git` 보존을
허용하도록"* 이었다. **그대로는 만족시킬 수 없다** — git은 중첩 `.git/`을 gitlink로만 기록해
내용이 커밋되지 않는다. `eval-forge.py`의 `_FIXTURE_IGNORE`는 원인이 아니라 증상이었다.
조건을 ①′(선언적 `git.json`을 러너가 실체화)로 정정해 충족했고, 원래 문구와 정정 근거를
`_promotionConditionCorrection`에 보존했다 — 값을 조용히 바꾸면 다음 사람이 이유를 알 수 없다.

### Fixed — 아무것도 검사하지 않던 어서션 2건

교차 검토에서 발견해 **조였다**(약화가 아니다).

- `feature-branch-commit`의 `git_log_contains("greet")`는 `git.json` 초기 커밋 메시지에 이미
  매치돼 **에이전트가 아무것도 하지 않아도 통과**했다. 제거하고 `file_contains`를 넣어,
  변경을 **버려서** 트리를 clean하게 만드는 게이밍 경로를 닫았다
- `merge-conflict-escalation`의 `"Merge branch"` 부정 검사는 기본 머지 메시지를 전제해
  커스텀 메시지로 우회 가능했다. feature 커밋이 `main`의 조상이 됐는지로 교체 — 메시지
  선택과 무관하게 잡힌다

### Security — `git.json` 화이트리스트를 우회하는 임의 코드 실행 2건 (배포 전 차단)

**둘 다 이 배치가 스스로 세운 보안 주장을 같은 파일 안에서 위반하고 있었다.**

**① `write` 로 `.git/` 에 쓸 수 있었다.** `config` op 을 제거하며 차단했다고 선언한 공격
(`filter.<n>.clean` = 셸 명령 + `.gitattributes` + `add` → 실행 비트 없이 발화)이
`.git/config` 를 직접 쓰는 것으로 그대로 재현됐다. **PoC 로 마커 파일 생성까지 확인.**
원인은 `_safe_join` 의 설계 범위 오해다 — 이 함수는 "base 밖 탈출"만 막고 `.git/config` 는
base **안**이라 통과시킨다. 경로 봉쇄가 있다는 것이 안전하다는 뜻은 아니다.
수정: `_is_git_internal()` 로 `.git` 성분 경로를 **검증·실행 양쪽에서** 거부(대소문자 접어
비교 — macOS 기본 FS 는 비구분). `.gitignore`·`.gitattributes` 같은 정상 dotfile 은 허용 유지.

**② 실체화 경로에 옵션 주입 가드가 없었다.** 화이트리스트가 "연산 8종"을 제한해도
`add.paths`·`checkout.ref`·`merge.ref` 등 **전달 인자가 무제한이면 보안 주장이 성립하지 않는다.**
같은 파일의 어서션 채점기는 그 경계를 이미 세워 둔 상태여서 방어가 비대칭이었다.
수정: `-` 시작 값 거부 + `add`/`checkout` 에 `--` 종결자. 인자 조립을 순수 함수
(`_git_args_for`)로 분리해 새니타이즈를 단위 테스트로 고정했다.

부수로 `_run_git` 에 **60초 상한**을 넣었다 — 없으면 자격증명 프롬프트·파일 잠금에서
스위트가 무한 대기한다(시나리오 타임아웃은 `claude` 호출에만 걸려 있어 이 구간을 덮지 않는다).

### Fixed — 이 배치의 핵심 동작 변경이 검증되지 않고 있었다

`git-workflow` 정의에 새로 넣은 *"무인 실행 시 안전 기본값은 되돌리기"* 조항을 검사하는
어서션이 없었다. `git_status_clean` 을 추가하자 **바로 실패했다** — 에이전트가 충돌을
보고하고 머지 커밋도 만들지 않지만 저장소를 **MERGING 상태로 방치**하고 있었다.
이 어서션 없이는 "제대로 abort 함"과 "충돌 방치"가 구분되지 않아(둘 다 머지 커밋이 없다)
**검증됐다고 잘못 주장할 뻔했다.**

원인은 조건부 서술이었다 — "무인 실행이면"을 에이전트가 스스로 판정하게 뒀다. 정의를
**예외 없는 3단계 순서**(충돌 정보 수집 → `--abort` 로 되돌리기 → 보고·방안 제시)로 바꾸고
*"작업 트리를 충돌 상태로 남긴 채 종료하지 않는다"* 를 NEVER 로 명시했다. 수정 후 2/2 통과.

### Fixed — `output_not_contains` 거짓 green 가드가 정반대 상황에서 발화했다 (18개 시나리오)

`security-scan` 이 취약점 2종을 정확히 보고하고도(positive 어서션 2개 통과) fail 했다.
원인은 에이전트가 제시한 **수정안 코드 주석** `# 원자적 rename, 심볼릭 링크 문제 없음` —
실제 판정은 `보안 상태: Critical`(Critical 1·High 2·Medium 2·Low 1)이었다.

동일한 12개 값 목록이 **18개 시나리오에 복사**돼 있어 전부 같은 지뢰였다. 판정이 아니라
일반 어구인 5종(`문제 없음`·`문제가 없`·`이상 없음`·`looks fine`·`looks good`)을 전부에서
제거하고, 결함 부재를 **선언**하는 형태만 남겼다.

**약화가 아니라 정밀도 조정이다**: 진짜 거짓 green 은 "취약점 없음"으로 선언되지 코드
주석으로 나타나지 않으며, 이 가드를 가진 모든 시나리오가 positive 어서션을 함께 갖고 있어
진짜 거짓 green 이면 그쪽이 먼저 실패한다. 실측 누계는 **거짓양성 3건 / 진짜양성 0건**이다
(`analyze-dependencies` 의 2건은 W-022 R3 에 이미 기록돼 있었다). 판단 기준을
`evals/README.md` 에 규율로 명문화했다 — *"그 문자열이 '여기는 괜찮다'는 부분 서술이나
수정안 설명에 등장할 수 있는가? 있으면 넣지 마라."*

### Fixed — `evals/README.md` 가 삭제된 어서션 타입을 문서화하고 있었다

예시 `expect.json` 에 `delegation_signal` 이 남아 있어, 복사한 새 시나리오는
`--validate` 가 `알 수 없는 type` 으로 exit 1 → **게이트 §10 이 통째로 red** 가 된다.
스펙의 수용 테스트가 `evals/run.py` 만 grep 하도록 좁게 적힌 것이 원인이었다.
함께 `git.json` 스펙과 신규 어서션 3종(한계 포함)을 README 에 문서화했고,
`CKKIT_EVAL_TIMEOUT` 기본값 표기가 `policy.json`(600)과 어긋나던 것(300)도 정정했다.

### Fixed — 어서션 2건이 산출물이 없는 곳을 검사하고 있었다 (게이트 플레이크의 실제 원인)

릴리스 직전 기준선 재생성이 36/37로 떨어졌다. 실패한
`define-business-logic/point-service-rules`는 W-023이 건드리지 않은 기존 시나리오였고,
`policy.json`은 이미 이 시나리오를 *"동전 던지기"*로 기록해 두고 있었다 — **원인은 적혀 있지
않았다.** 원인을 규명한 결과 진단 자체가 틀려 있었다.

**실제 원인: 어서션이 계약되지 않은 부수 채널을 보고 있었다.** `define-business-logic`과
`design-user-journey`는 정의 §"문서 저장 위치"가 산출물을 **파일**로 지정하고 `tools`에
`Write`를 갖는다. 그런데 두 시나리오의 어서션은 **stdout**을 검사했다. 파일은 매번 확실히
쓰이지만 stdout에 그 내용을 다시 뱉는지는 모델 재량이라, 채점이 실행마다 뒤집혔다.

실증(프로브 실행, 214.1s): `docs/planning/business-logic/point-rules.md`(15336B)에
`CALC-`/`VAL-`/`STATE-`/`POL-` 4종 전부 존재. 관측 3회 중 stdout 통과 2 / 실패 1.

**전수 조사 결과 같은 패턴은 정확히 2건**이고, 그 2건이 `policy.json`이 불안정하다고 지목했던
바로 그 2건이었다. 두 시나리오의 어서션을 `file_contains`로 옮기고, 파일명이 모델 재량
(`[도메인명]-rules.md`)이라 지목할 수 없던 문제는 `task.md`가 산출 경로를 명시해 해소했다.
검사 대상을 옮긴 것이지 기준을 낮춘 것이 아니다 — 오히려 "채팅에서 요청을 되풀이"가
"납품 문서가 그 케이스를 다룬다"로 강화된다.

**`cost._meta`의 진단도 정정했다.** 300→600s 타임아웃 상향 당시 불안정의 원인을
*"opus + effort:high 설계류 planning 에이전트의 본질적 소요"*로 적었으나, 소요가 긴 것은
사실이어도 그것이 **채점 실패**의 원인은 아니었다. 타임아웃 값 자체는 유지한다(실측
214~394s로 300s 상한에 실제로 근접하므로 그 판단은 옳았다) — 정정되는 것은 원인 진단이다.

> 남은 약점을 기록해 둔다: `design-user-journey`의 `품절`·`카드`는 fixture 원문에 있는
> 단어라, 파일 기반으로 옮긴 뒤에도 문서가 요청을 인용만 하면 통과한다(`상태`만 fixture에
> 없어 현재도 능력을 측정한다). 이번엔 플레이크 원인만 고치고 이 약점은 `_designNote`에
> 남겼다 — 검사 대상과 검사 내용을 동시에 바꾸면 무엇이 결과를 바꿨는지 분리되지 않는다.

### Fixed — `CLAUDE.md`의 `delegation_signal` 존치 근거가 사실이 아니었다

*"안정 통과 시나리오가 있어 체크 자체는 유효했다"*고 적혀 있었으나, 그 시나리오들의
어서션은 **바로 그 배치에서 이미 제거돼 있었다** — 판단 시점에 이미 사실이 아니었다.
실사용 0건 확인과 함께 정정했다.

## [2.16.0] — 2026-08-27

W-022 "remaining debt" 배치. **구현보다 판정이 많았던 릴리스다** — 아래 11건 중 3건이
`Decided`(무엇을 **하지 않기로** 했는지와 그 승격 조건)이고, 3건은 우리 자신의 이전
결과물을 정정한 `Fixed`다. 소비자에게 보이는 동작 변경은 DELEGATION_SIGNAL 폐기 하나뿐이며,
나머지는 커버리지·게이트·패키징 기반 작업이다.

### Changed — DELEGATION_SIGNAL 계약 폐기 (W-022 R1, 세션 동작 변경)

**소비자에게 보이는 동작 변경.** 매 세션 주입되는 규칙(`plugins/common/rules/`)이
바뀌었다 — 서브에이전트 출력을 받은 뒤 메인 Claude가 하던 절차가 달라진다.

**무엇이 바뀌었나.** 과거 모든 에이전트는 출력 끝에 `---DELEGATION_SIGNAL---` 블록
(`TYPE`/`TARGET`/`REASON`/`CONTEXT`)으로 끝나야 했고, 메인 Claude는 이 블록을 스캔해
`TARGET`으로 다음 에이전트를 자동 호출했다(순차 체인 모델). 이제 메인 Claude는 서브
에이전트 출력을 **읽고 판단할 결과물**로 다루고, 다음 단계는 호출한 스킬(`auto-dev` 등)이
정한다 — 신호 문자열을 파싱해 분기하지 않는다.

**소비자에게 무슨 영향인가.** 별도 조치는 필요 없다 — 오케스트레이션은 이미 스킬 주도
플랫 위임(Spec 2/W-006)으로 동작하고 있었고, 이번 변경은 그 실태에 맞춰 계약과 문서를
정리한 것이다. 커스텀 에이전트를 만들 때 더 이상 `---DELEGATION_SIGNAL---` 블록을
흉내 낼 필요가 없다.

**왜 폐기했나.** 판별 결과(W-021) hooks·skills·scripts·rules 어디에도 이 블록을
파싱하는 결정론적 코드가 없었다 — rules의 유일한 소비 지점도 파서가 아니라 메인
Claude에게 준 자연어 지시였다. 오케스트레이션도 이미 스킬 주도 플랫 위임으로
넘어가 있어, 신호는 아무도 읽지 않는 사문화된 2차 경로였는데도 파이프라인은 정상
동작했다. 조사를 시작하게 만든 트리거는 커버리지를 13종으로 넓히며(W-018) 관측된
준수율(8종 중 6종)이었지만, 이 관측은 교란돼 있다 — `implement-code`의 안정적
준수는 `task.md`가 신호 보고를 직접 지시한 조건의 결과였고, 무지시 준수 사례는
`plan-implementation` 2/2뿐이다. 폐기 근거는 이 통계가 아니라 결정론적 파싱 부재와
오케스트레이션 모델 이전이므로 판정은 그대로다.
상세: `docs/specs/2026-08-27-delegation-signal-contract-review.md`(W-021).

**어디까지 걷어냈나**: 에이전트 정의 33종의 본문 블록 + frontmatter 신호 토큰(32종),
스킬 4종의 예시 블록, `verify-done.sh` §12 + CI 동등 스텝, 주입 규칙 2종의 신호
기계 계약(무관 정책은 보존), 해설본 미러. eval `delegation_signal` 체크 타입은
유지하되(코드 자체는 결함이 아니었다) 5개 시나리오의 어서션은 제거. 상세 근거·범위:
`docs/specs/2026-08-27-delegation-signal-contract-review.md`(W-021),
`CLAUDE.md`의 "Delegation Signal" 절.

### Added — `/eval-forge` 어서션 타입 확장 (W-022 R2)

`scripts/eval-forge.py`가 `evals/run.py`의 7개 어서션 타입 중 3개를 만들 방법이
없었다 — 생성 후 `expect.json`을 손으로 보강해야 했다. `--output-regex
PATTERN FLAGS`(반복 지정, FLAGS 빈 문자열이면 flags 키 생략)와 `--file-unchanged
FILE`(반복 지정)을 신설했고, 단일 값만 받던 `--file-contains`를 반복 지정으로
바꿨다. `delegation_signal`은 계약이 폐기됐으므로(R1) opt-in 플래그조차 만들지
않았다. 회귀 테스트 6건 추가(수정 전 5건 red 확인). 자기적용 검증: 확장된
CLI로 신규 시나리오를 생성해 `--validate`를 손 편집 0으로 통과시켰다(증적 후
롤백 — baseline 미등재로 인한 커버리지 게이트 파손과 R3 tier2 분류 선점을
피하기 위함). 상세: `docs/specs/2026-08-27-remaining-debt-batch.md` §R2.

**후속 수정(적대적 리뷰 High)**: `--output-regex`/`--file-contains`의 PATTERN을
검증 없이 그대로 썼다 — 빈 패턴은 항상 매치하는 무의미한 어서션을 만들고,
문법이 깨진 패턴은 생성·`--validate`는 초록인데 실제 `run.py` 실행에서만
`re.error`로 죽는다. 생성 시점에 빈 패턴 거부 + `re.compile()` 검증을 추가했다.

### Added — R3: 티어2 eval 커버리지 확대 (W-022)

나머지 20개 에이전트를 이름이 아니라 각 정의의 `tools:`/출력 계약을 실제로 읽고
평가 가능성으로 분류했다: **가능 15 / 조건부 3(`research-external`·
`analyze-domain`·`clarify-requirements`) / 불가 2(`facilitator-teams`·
`git-workflow`)**. 조건부·불가는 `evals/policy.json`의 `_tier2Classification`에
등급·사유·승격 조건과 함께 남겼다 — 억지로 채운 시나리오는 없다. 특히
`git-workflow`는 사전 조사 없이는 안 보이는 이유로 빠졌다: `eval-forge`의
fixture 스테이징이 `.git`을 원천 제외해 실제 저장소 상태를 재현할 방법이
없고, git 로그/커밋을 검사하는 assertion 타입도 없다.

가능 15종 전부에 결정적 시나리오를 새로 만들었다(`evals/policy.json`
`tiers.tier2`) — 읽기전용 에이전트는 `task.md`가 아니라 fixture에 심은 실제
식별자·리터럴 토큰(예: `define-business-logic`의 `CALC-`/`VAL-`/`STATE-`/`POL-`)을
앵커로 삼아 자기충족을 피했다. 그중 `analyze-dependencies`는 애초에 넣었던
"문제 없음" 계열 네거티브 어서션을 두 차례(부분 맥락 오탐 → 결론부로 좁혀도
재오탐) 실측 후 제거했다 — 나머지 5개 어서션이 이미 실질을 검증하므로
판별력 없는 부정 검사를 억지로 유지하지 않았다(`_removedAssertions` 참고).

시나리오 추가 과정에서 planning 계열 opus+`effort:high` 에이전트 2종이 기본
300초 타임아웃 경계에서 불안정했다(하나는 타임아웃, 다른 하나는 298.2초로
우연히 통과) — 과제 크기가 아니라 이 등급 에이전트의 본질적 소요임을 확인하고
`evals/policy.json`의 `cost.scenarioTimeoutSeconds`를 600초로 상향했다(SSOT는
정책 파일, `CKKIT_EVAL_TIMEOUT` 환경변수는 override로만 유지). 기준선을 35건
전량 재실행해 재생성했다 — 기존 21건 회귀 0.

### Added — R7: `docs/conventions/` SSOT + `AGENTS.md` 두 번째 생성 블록 (W-022, Track B)

호스트 무관 관례(경로 봉쇄, 게이트 비통합 등) 7건이 `CLAUDE.md`에 산문으로만 있어
Codex·Antigravity 등 다른 하네스에서 이 kit 레포 자체를 작업하는 기여자는 볼 방법이
없었다. `docs/conventions/*.md`로 분리해 `CLAUDE.md`는 `@docs/conventions/<file>.md`
import로 읽고, `plugins/common/hooks/export_harness.py`는 `AGENTS.md`에 **독립된 두 번째
마커 블록**(`<!-- cck2:begin conventions-v… sha256:… -->`)으로 그중 가장 핵심적인 2건
(`path-containment.md`, `no-gate-integration.md`)을 인라인한다 — 나머지는 경로 참조만.

- 완전히 별도 마커 네임스페이스(`cck2:`) — 기존 `cck:` 규범 블록의 정규식·처리 로직은
  한 글자도 건드리지 않았다(둘을 같은 접두어로 섞으면 규범 블록의 손상 감지가 오판한다)
- `docs/conventions/`가 없는 target(설치된 플러그인 캐시)에서는 conv 블록이 조용히
  생성 대상에서 빠진다(`build_conventions_block()` → `None`) — 소비자 프로젝트 동작은
  이 변경으로 조금도 안 바뀐다
- Codex `project_doc_max_bytes`(병합 총량, 기본 32 KiB, 초과 시 조용히 잘림)의 75%인
  24,576 B를 이 레포 몫의 보수적 상한으로 두고, `verify-done.sh` 신설 §15가 강제한다.
  실측 `AGENTS.md` 23,443 B — 여유 1,133 B
- conv 블록 드리프트는 새 게이트를 만들지 않고 기존 §11(`export-harness.sh --check`)이
  같은 명령 안에서 함께 검사한다 — rules 블록과 conv 블록은 "생성물이 소스와
  일치하는가"라는 같은 질문의 같은 도구이므로, "드리프트 게이트는 통합하지 않는다"는
  판단(별개 도메인 3종 게이트 간의 것)과 배치되지 않는다
- 테스트 9건 추가(`test_export_harness.py`) — 소스 부재 시 None, 인라인/참조 목록 파일
  누락 시 실패, 두 블록 공존·독립 드리프트·마커 문자열 자기오염·본문 변조·유휴성 검증

### Added — R8: `scripts/bump-version.sh` (W-022, Track B)

버전을 SSOT(`plugins/common/.claude-plugin/plugin.json`)에서 올리면 곧바로 타겟 매니페스트를
재생성(`build-targets.py --write`)하고 자기 결과를 검증(`--check`)한다 — v2.15.0에서 실제로
밟은 "SSOT만 올리고 재생성을 잊는" 함정을 사람이 두 단계를 기억할 필요 없이 예방한다.

낡은 버전 문자열 감사 도구(`audit-version-strings.py`)도 **만들어서 실물 레포에 돌려봤지만
뺐다.** 이 레포는 버전이 실리는 자리(타겟 매니페스트·CHANGELOG↔SSOT·README)가 전부 생성물이거나
기존 게이트로 이미 막혀 있어, superpowers류 손편집 감사가 지킬 대상 자체가 없었다 — 그 도구가
잡아낸 93건 중 압도적 다수는 "버전 주장"이 아니라 "과거 사고를 버전으로 회고하는 코드 주석"이었고,
문자열 매칭으로는 그 둘을 가를 수 없었다. "만들지 않았다"가 아니라 **"만들어 실측하고 필요 없다고
판단해 뺐다"**가 정확한 기록이다.

### Fixed — `§9 test-ratchet` 이 테스트 삭제를 못 보고 있었다 (W-022, 기획 세션)

실패 모드가 셋이었다. **(A) 순증감 마스킹** — `merge-base` 대비 net만 보므로 먼저 추가하고
나중에 지우면 green. **(B) 생애주기 은닉(더 근본적)** — 파일이 base 이후 생겼다가 HEAD 전에
지워지면 base에도 HEAD에도 없어 **diff에 아예 나타나지 않는다**. 상쇄가 아니라 관측 불가다.
**(C) allow-marker 남용** — `TEST-RATCHET-ALLOW` 가 diff 아무 곳에나 있으면 검사 전체가 꺼졌다.

수정: `base..HEAD` **각 커밋**을 훑고, 마커는 **커밋 메시지**에서 찾는다(정당성이 `git log` 에 남는다).
red 실증 완료 — 전체 순증감이 green(+27)인 상태에서 커밋 단위 검사가 정확히 삭제 커밋을 지목했다.

> 발견 계기는 R8의 감사 도구를 폐기하며 던진 질문이다: "테스트 12건이 줄어드는데 §9가 잡을까?"
> 답은 "못 잡는다"였다. **게이트가 있다는 사실이 방어를 보증하지 않는다.**

### Fixed — v2.15.0이 근거로 인용한 준수율 측정이 교란돼 있었다 (W-022, 기획 세션)

v2.15.0 CHANGELOG의 "관측 8종 중 6종(75%) 미준수"는 **대조군 결함**을 안고 있었다.
`implement-code` 시나리오의 `task.md` 가 신호 형식을 **직접 지시했으므로** 그 6/6은 대조군이 아니다.
무지시 준수 사례는 `plan-implementation` 2/2(n=2)뿐이다.

DELEGATION_SIGNAL 폐기 결론은 유지된다(근거는 ①파싱 코드 부재 ②오케스트레이션 이전이고 교란과 무관).
바뀌는 것은 **근거의 무게중심**이며, "75% 미준수"는 조사 트리거였지 판정 근거가 아니다.
**관측값은 보존하고 해석만 정정**했다 — 스펙·v2.15.0 CHANGELOG·`CLAUDE.md`·ledger·decision-log 다섯 곳.

**후속(최종 점검에서 발견)**: 위 다섯 곳을 고치면서 **매 세션 주입되는 룰 본문**
(`plugins/common/rules/agent-delegation-chain.md`)과 그 해설본 미러가 같은 통계를 여전히
**근거로** 인용하고 있었다. 주입물이라 오히려 더 나쁘다 — 이 레포를 처음 보는 세션이
교란된 숫자를 판정 근거로 읽는다. 둘 다 정정해 통계를 **트리거로 강등**하고, 실제 근거
두 가지(파싱 코드 부재·오케스트레이션 이전)를 전면에 뒀다. 같은 점검에서 `AGENTS.md` 의
이식 제외 사유가 폐기된 "위임 신호에 종속"을 인용하던 것도 발견해 생성 소스
(`export_harness.py`)에서 "서브에이전트 호출·수명주기 규격에 종속"으로 바로잡고 재생성했다.
CHECKSUMS·MIRROR 매니페스트도 함께 재생성했다.

자기충족 감사를 전수로 돌린 결과 나머지 시나리오는 깨끗했다. `evals/README.md` 에 원칙을 명문화했다:
**어서션은 `task.md` 가 지시하지 않은 것을 검사할 때만 능력을 측정한다.**

### Fixed — `README.md` 가 폐기된 계약을 현재형으로 설명하고 있었다 (W-022, 교차 리뷰)

`CLAUDE.md`·`rules/agent-delegation-chain.md` 는 정확히 처리됐는데 **가장 소비자 대면적인 문서만**
빠졌다. 배포 문서가 배포 동작과 다른 것 — 2.14.2에서 이미 고친 결함 유형이 같은 배치 안에서 재발했고,
교차 적대적 리뷰가 아니었으면 릴리스에 실렸다.
폐기 기록으로 교체하면서 **"사라진 것은 기계 판독 블록이지 위임이 아니다"** 를 분명히 했다.

### Decided — Antigravity 훅은 싣지 않는다 (W-022 R4, Track B)

`agy plugin validate`에 exec form 그대로의 루트 `hooks.json`을 스크래치 플러그인으로 돌리면
`hooks: 1 processed`가 나온다. 그러나 이 "processed"는 skills를 21로(실제 19), agents를
4로(실제 33, 인식 0) 오집계하는 것과 **같은 도구가 같은 방식으로** 낸 숫자다 — `agy plugin
validate`는 파일이 있는지만 세지, 훅 이벤트 4종(SessionStart 등)의 내용을 이해했다는 증거는
어디에도 없다. Codex 훅이 exec form을 로드하지 않는다는 걸 실측 없이 "매니페스트가
읽힌다"만으로 넘겼다가 2.12.1에서 훅 4종이 조용히 죽어 있었던 사고와 같은 유형의 오판을
반복하지 않기 위해, **파일 카운트만으로는 판정하지 않는다**. `packaging/targets.json`의
Antigravity 타겟에 `_hooksEnableWhen`을 명시했다 — 재검토 조건은 "실제 Antigravity 세션에서
훅이 발화함을 마커 파일로 확인"이지, `agy plugin validate`의 processed 카운트가 아니다.

부수 정정: 위 `[2.15.0]`의 "Antigravity ... green으로 전환" 서술에 이 구분을 반영하는 주석을
추가했다 — "green"이 "설치 가능함을 확인" 이상을 의미하지 않는다는 것.

### Decided — Codex 훅 문자열 형식 변환은 기술적으로 가능하지만 **아직 싣지 않는다** (W-022 R5, Track B)

S4(v2.15.0)는 exec form이 로드되지 않는다는 것만 확정했다. 이번 R5는 그 후속 질문 — "그럼
따옴표로 감싼 문자열 형식(superpowers 패턴)은 되는가"를 실측했다. **된다.** 스크래치
플러그인에 `"command": "\"${CLAUDE_PLUGIN_ROOT}/hooks/mark.sh\""`를 설치해 `codex exec`로
SessionStart를 유발한 결과, `${CLAUDE_PLUGIN_ROOT}`가 실제 설치 경로로 치환되고 같은 값이
하위 프로세스 환경변수로도 주입됨을 마커 파일로 확인했다(10초 내 발화, 5분 타임아웃 없이 완료).

**그러나 형식 변환과 기능 이식은 다른 문제다.** kit의 실제 훅 5개는 Claude Code의 이벤트
모델(툴 이름, PreToolUse/PostToolUse stdin JSON)에 맞춰 쓰였다 — 포맷만 바꿔 Codex가 실행하게
만들어도 Codex의 이벤트·페이로드가 다르므로 의미 있게 동작하지 않는다. Codex에 실제로 유용한
훅을 실으려면 **Codex 전용 훅 구현**이 새로 필요하고, 그건 R5(형식 변환 가능성 판정)의 범위
밖이다. → 이 배치에서는 `hooks` 필드를 계속 넣지 않는다. `packaging/targets.json`의 codex
타겟에 재검토 조건을 명시했다: Codex 네이티브 훅 구현이 실제 세션에서 의도한 부작용을 낸다고
실측될 때.

### Decided — 타겟 확장은 `runtime-verified` 만 활성화, 나머지는 근거와 함께 대기 (W-022 R9, Track B)

superpowers는 9개 하네스에 배포하지만, 그 프로젝트는 새 하네스 지원에 수용 테스트 트랜스크립트를
요구한다. 우리는 로컬에 `codex`·`agy` CLI만 있다 — 검증할 수 없는 타겟을 실었다가 Antigravity
`agents/`처럼 "형식은 맞는데 안 도는" 컴포넌트를 광고하는 실수를 반복하지 않는다.

- `packaging/targets.json`에 **3단계 검증 수준**을 SSOT로 명문화: `runtime-verified`(CLI
  왕복 확인, codex·antigravity가 여기) / `spec-verified`(공식 스키마는 확인했으나 로컬에 CLI가
  없어 런타임 미확인) / `researched-only`(문서만 조사됨). 활성화 기준은 **`runtime-verified`
  유지** — Antigravity 사건이 "스키마가 맞아도 발견이 실패할 수 있다"를 이미 증명했다
- **Cursor** 조사: 공식 스펙 저장소·문서 확인 결과 `skills`·`agents`·`rules`·`hooks`·
  `commands`·`mcpServers` 6종을 전부 1급 지원 — kit의 33 에이전트 + 13 rules를 전부 실을 수
  있는 유일한 후보다(codex는 skills만, antigravity는 agents 비지원). `spec-verified`로
  기록하고 비활성 유지, `_enableWhen`(cursor CLI 왕복 검증 또는 사용자 제공 수용 테스트)을
  명시
- **Pi** 조사: 확장이 매니페스트가 아니라 TypeScript 모듈(`ExtensionAPI` factory export,
  npm/git 배포) — kit의 SSOT→매니페스트 생성기 모델이 구조적으로 도달할 수 없다.
  `researched-only`로 신규 등재하고 비활성 유지(근거 있는 폐기 — "언젠가 볼 대상"이 아니라
  "이 구조로는 안 된다"는 확정)
- opencode·copilot은 이번 R9 조사 범위 밖 — 기존 `[unresolved]` 표기를 그대로 유지했다(새로
  조사하지 않은 것을 조사한 것처럼 승격시키지 않는다)

---

## [2.15.0] — 2026-08-27

두 갈래를 한 릴리스로 묶는다. 공통점은 **"주장을 기계로 강제한다"** 는 것이다 —
eval 커버리지 주장(W-018)과 패키지 정합성 주장(W-019) 둘 다 이번에 게이트를 얻었다.

출하 전에 두 트랙이 **서로의 코드를 적대적으로 교차 리뷰**했다(각자 자기가 쓰지 않은 코드).
Critical 0건, 재현된 High 2건이 나왔고 둘 다 태그 전에 고쳤다. 그 리뷰가 "같은 결함 클래스의
반복"을 지목한 덕분에 **세 번째 인스턴스**를 전수조사로 찾았다 — 아래 세 개의 Fixed 항목이 그것이다.

### Added — Agent evals 커버리지·기준선 게이트 (W-018)

Eval 커버리지가 33개 에이전트 중 4개뿐이었다. `/self-improve` 의 이중 게이트가 사실상
사용자 승인 단일 게이트로 퇴화하는 원인이었다. 게다가 시나리오 12건과 기준선 11건이
어긋나 있었는데도(2.14.0에서 `security-scan` 시나리오가 기준선 없이 추가됐다) 그 드리프트를
잡는 기계 검사가 없었다.

- `evals/policy.json` 신설 — 티어·임계값·기준선 포인터의 **단일 소스**.
  기준선은 명시적 포인터만 쓴다("가장 최신 파일 자동 선택" 금지 — 조용히 틀린 기준선을 쓰게 된다)
- `scripts/check_eval_coverage.py` 신설 — 시나리오⇄기준선 **양방향** 드리프트 검사 +
  티어1 최소 커버리지 검사. `verify-done.sh` 신설 §13과 CI가 **같은 스크립트**를 호출한다
- 티어1 커버리지 **4/33 → 13/13**. 티어 선정 기준은 위험도다 —
  파일을 수정하는 8종(`isolation: worktree` 보유) + 검증 3종 + 진입점 2종
- 시나리오 12건 → **21건**. 기준선 재생성(21/21 pass), 기존 시나리오 회귀 0
- `gate.tier1CoverageEnforceFail` 승격 — 티어1 커버리지 미달이 경고가 아니라 게이트 fail.
  승격 전후를 **같은 결손 상태에서 flag만 바꿔** 격리 실증했다
- `docs/works/feedback/ledger.md` 부트스트랩 — 전부 이번 배치에서 **실측된** 결함 5건.
  추정은 넣지 않았고, 재현되지 않은 건은 "미검증"으로 명시했다

### Fixed — `file_contains` 어서션이 `re.MULTILINE` 을 적용하지 않았다

`^` 앵커가 파일 첫 줄에만 매치해 **실제 false-fail** 을 냈다(우리 도구가 조용히 오작동하고
있었다). 수정 전 red를 확인하는 회귀 테스트를 먼저 추가한 뒤 고쳤다.

### Investigated — DELEGATION_SIGNAL 출력 계약이 런타임에 지켜지지 않는다

커버리지를 넓힌 **첫 성과가 결함 발견**이었다. 관측 8종 중 **6종(75%)** 이 필수 출력 마커를
간헐적으로 생략한다: `implement-code` 6/6 · `plan-implementation` 2/2 는 안정,
`write-tests` 1/2 · `sync-docs` 2/3 · `optimize-logic` 1/4 · `explore-codebase` 1/2 ·
`verify-code` 1/2 · `implement-api` 1/2 는 불안정.

`implement-api` 가 모델·effort와 무관하게 실패해 "좋은 모델이면 안정"이라는 가설을 반증했다.

> **⚠ 이 측정은 교란돼 있다 (2026-08-27 확인, v2.16.0 배치에서 발견).** `implement-code` 시나리오
> 3건의 `task.md` 가 신호 형식을 **직접 지시한다** — 나머지는 지시하지 않는다. 따라서 `implement-code`
> 6/6 은 대조군이 아니며, 무지시 준수 사례는 `plan-implementation` 2/2(n=2)뿐이다.
> 관측값은 유효하나 **"75% 미준수"를 결론의 근거로 읽어서는 안 된다.** 측정을 설계한 쪽의 결함이다.
**계약이 정의 파일에 적혀 있는지는 `verify-done §12` 가 33/33 검사해 왔으나, 런타임에 실제
방출되는지는 아무도 잰 적이 없었다.**

이번 배치에서는 **운영 규칙만** 확정했다 — 불안정한 어서션을 결정적 게이트에서 분리하고
(삭제가 아니다: 사유·재부착 조건을 `expect.json._removedAssertions` 에 남겼고, 안정 통과하는
건은 유지했다), 신규 시나리오는 사전 관측 없이 이 어서션을 넣지 않는다. 근본 원인은
에이전트 정의 몫이고 아키텍처 결정이라 `docs/specs/2026-08-27-delegation-signal-contract-review.md`
(W-021)로 분리했다.

### Decided — `docs/pipeline-reinforcement-plan-v2.md` Track 2 폐기

"Delegation Signal JSON화"를 2026-05부터 보류하고 있었다. 보류 해제 조건("실제 파싱 실패
사례")이 한 번도 성립하지 않았고, 반복 관측된 문제(마커 **완전 누락**)는 JSON화로 고쳐지지
않는 다른 종류의 결함이다 — 같은 유형이 W-014에서 이미 프롬프트 레벨로 해결된 전례가 있다.

### Added — Codex · Antigravity 네이티브 플러그인 패키지 (W-019)

`plugins/common/` 이 이제 **세 플랫폼의 네이티브 매니페스트**를 함께 싣는다. Codex는
`.codex-plugin/plugin.json` + `.agents/plugins/marketplace.json`, Antigravity는 루트
`plugin.json`. 전부 기존 Claude Code 매니페스트(SSOT)에서 **생성**되며 손으로 쓰지 않는다
(`scripts/build-targets.py`, 정책은 `packaging/targets.json`).

`verify-done.sh` **§14** 가 드리프트를 막는다 — `enabled:true` 타겟의 매니페스트는 존재해야
하고 SSOT와 일치해야 한다. **파일이 없는 것도 드리프트로 센다**(생성물 삭제가 조용히 통과하던
구멍을 설계 단계에서 막았다).

문서가 아니라 **실물 CLI로 검증**했다:

- **Codex** (`codex-cli` 0.147.0): `marketplace add` → `list` 에 `claude-code-kit` 표시 →
  `remove` 왕복 정상, `~/.codex/config.toml` 원복 확인. 생성 매니페스트는 `name`/`version`/
  `description` 에 더해 `author`/`homepage`/`repository`/`license`/`keywords` 를 SSOT에서
  통과시킨다 — 초안은 이것들을 빠뜨려 **저작자도 라이선스도 없는 패키지**를 공개 디렉토리에
  올릴 뻔했다
- **Antigravity** (`agy` 1.1.20): `agy plugin validate plugins/common` 이 green으로 전환
  (이전엔 `missing plugin.json` 으로 fail), install→list→uninstall 왕복 정상, 기존 플러그인 불변.
  **주의(W-022 R4에서 재확인, 2026-08-27)**: 이 "green"은 **파일 존재 확인**이지 내용 검증이
  아니다 — 같은 도구가 skills를 21로(실제 19), agents를 4로(실제 33, 아래 참고) 오집계하는
  근거가 바로 아래 단락이다. "green 전환"을 "설치 가능함을 확인"보다 강하게 읽지 말 것
- **Claude Code 무영향 확증**: 실사용 설치본을 건드리지 않고 `plugins/common` 의 스크래치
  복사본을 다른 이름으로 임시 설치해 `claude plugin details` 컴포넌트 인벤토리를 대조 —
  스킬·에이전트·훅·MCP·LSP 수와 이름이 완전히 동일

### Fixed — 스펙 초안이 Antigravity의 `agents/` 지원을 잘못 주장했다

설계 초안(`docs/specs/2026-08-26-multi-harness-packaging.md` §5.5)은 Antigravity를
"`rules`·`agents` 까지 1급 지원하는 유일한 타겟"이라고 적었다. 실물 `agy` CLI 대조 결과
**`agy plugin validate` 는 `agents/` 를 재귀하지 않는다** — 최상위 항목만 세므로 4개 카테고리
아래 중첩된 kit의 33개 에이전트는 **하나도 인식되지 않고** "agents: 4"로 잡힌다. 재귀를 켜는
설정은 공식 문서·스키마 어디에도 없다(`$schema` URL 자체가 404).

`agents/` 는 두 타겟 어디에도 싣지 않고, 스펙 표와 README를 사실대로 고쳤다. **깨진 컴포넌트를
실은 채 "지원한다"고 광고하지 않는다.** 배포 문서가 배포 동작과 다른 것은 2.14.2에서 이미
고친 유형의 결함이다.

낮은 심각도 부수 발견: `agy plugin validate` 는 kit의 스킬을 19가 아니라 **21로 오집계**한다
(`SKILL.md` 가 없는 `skills/README.md` 와 `skills/references/` 를 함께 센다). agy 자체의 집계
한계이며 kit 구조 결함이 아니다 — 19개 스킬은 정상 설치·동작한다.

### Added — 문서

`packaging/README.md`(생성기 사용법), README의 "Other Harnesses" 절(3플랫폼 설치 절차와
**실리는 것/안 실리는 것**), `harness-export` 스킬의 `AGENTS.md` 경로와의 관계 설명,
`docs/codex-submission-checklist.md`(공개 게시는 계정 자격이 필요해 사람이 밟는 절차).

### 이번 배치에 넣지 않은 것 (조용히 빠뜨린 게 아니라 명시적 배제)

- **훅** — Codex 훅 런타임은 kit이 쓰는 **exec form(`command`+`args`)을 로드하지 않는다.**
  3단계 실측으로 확정했다: `python3`+args는 무해한 no-op, `touch`+args는 **명시적 Failed**
  (인자 없는 `touch` 에러 = args 미전달의 결정적 증거), 공식 단일 문자열은 성공(positive
  control). 문자열 형식 변환은 별도 배치다. Antigravity 훅 형식은 이번에 실측하지 않았다
- **공개 레지스트리 등재** — OpenAI submission portal 제출은 계정 자격이 필요하다.
  Antigravity의 공식 공개 레지스트리 유무는 `[unresolved]` — 구글 공식 문서는 로컬/워크스페이스
  설치만 기술하므로 그 경로만 문서화했다. **없는 것을 있는 것처럼 쓰지 않는다**
- **Cursor / OpenCode / Copilot** — `packaging/targets.json` 에서 비활성. Cursor 마켓플레이스는
  큐레이션 파트너 한정, OpenCode의 플러그인 단위는 매니페스트가 아니라 실행 가능한 JS/TS,
  Copilot은 매니페스트 기반 배포 단위 존재 여부 자체가 `[unresolved]`
- **eval 티어2 20종**, **`/eval-forge` 어서션 미지원 개선** — 후속 배치

### Fixed — `build-targets.py` 의 경로 탈출 (교차 리뷰 High)

`manifestPath` · `marketplace.path` 에 봉쇄가 없었다. `pathlib` 의 `a / b` 는 **`b` 가 절대경로면
`a` 를 통째로 버린다** — 절대경로·`..` 탈출·심링크(TOCTOU) 3종 전부 **레포 밖에 파일을 썼고**,
`--check` 와 `--write` 양쪽에서 재현됐다.

`export_harness.py` 가 2.14.1에서 High를 받은 것과 **같은 결함 클래스**다. 리뷰어가 이를 개별
버그가 아니라 반복되는 클래스로 지목한 것이 수정 방향을 정했다 — `_resolve_in_repo()` 는
`_resolve_target()` 과 같은 관례를 쓴다: **한 번만 resolve해서 그 결과를 끝까지 사용**(검사와
쓰기가 각각 resolve하면 그 틈이 TOCTOU다). 봉쇄 실패 시 `--check`·`--write` **양쪽** exit 1
(2.14.1에서는 `--check` 만 빠져 구멍이 남았다). 회귀 테스트 4종, 전부 수정 전 red 확인.

부수 수정: `--write` 가 타겟 하나에서 실패하면 나머지를 시도조차 않던 비원자성을 고쳐, 전부
시도하고 실패를 모아 exit 1 한다. `verify-done.sh` §14 주석이 실제 동작과 반대로 서술돼 있던 것도 정정.

### Added — 설정값 경로 봉쇄를 관례로 확정 (`CLAUDE.md`)

같은 결함이 세 번 반복된 원인은 인스턴스가 아니라 **관례 부재**였다. 규칙 4개를 못박았다 —
한 번만 resolve해 끝까지 사용 / 봉쇄 실패는 exit 1 / **읽기 경로도 봉쇄**(세 번째 인스턴스는
읽기 전용인데 거짓 green을 냈다) / **검사 전용 모드에도 동일 봉쇄**. 새 코드는 관례를 새로
발명하지 말고 기존 헬퍼를 따른다.

### Fixed — `check_eval_coverage.py` policy.json 스키마 누락 시 거짓 green (W-018/W-019 교차 리뷰)

`tiers`/`gate`/`coverage` 섹션이 통째로 없거나 `tiers.tier1`이 빈 배열이면
"검사 대상 0개"를 "전부 통과"로 오인해 exit 0을 냈다(W-019 교차 리뷰에서
sanddab이 실측). 필수 섹션 부재를 명확한 실패(`PolicyError`)로 바꾸고, 정책
최상위가 dict가 아닌 경우의 raw traceback도 같은 방식으로 정리했다. 회귀 테스트
5건 추가(수정 전 red 확인).

### Fixed — `check_eval_coverage.py`의 `baseline.file` 경로 탈출 (W-019 교차 리뷰 3차 후속)

`baseline.file`이 절대경로·`..` 상대경로·심링크를 가리키면 레포 밖 파일을
기준선으로 신뢰해 exit 0을 냈다 — `scripts/build-targets.py`(W-019)에서 나온 것과
같은 결함 클래스가 게이트 자신에도 있었다(sanddab 실측). `build-targets.py`의
`_resolve_in_repo()` 관례를 그대로 이식해 `evals/baseline/` 밖으로 못 나가게
봉쇄했다. 회귀 테스트 3건 추가(절대경로/상대경로 탈출/심링크, 수정 전 red 확인).

---

## [2.14.2] — 2026-08-24

### Fixed — `harness-export` 스킬 문서가 2.14.1의 바뀐 동작을 설명하지 않았다

2.14.1이 마커 인식을 "줄 전체 + `rules-v… sha256:<64hex>` 형식"으로 좁혔는데, 배포되는
스킬 문서에는 그 규약이 없었다. 소비자가 자기 `AGENTS.md`에 마커 예시를 한 줄로 적으면
이유를 모른 채 exit 1을 받는다 — 배포된 문서가 배포된 동작과 다른 것도 결함이다.

- `skills/harness-export/SKILL.md`에 "마커 규약" 절 추가: 인정되는 형식, 왜 좁혔는지
  (2.14.1 Critical의 실제 경위), 그리고 문서에 마커를 인용할 때는 **인라인으로** 쓰라는
  지침. 거부는 파괴가 아니라 사람에게 넘기는 것임도 명시했다.

---

## [2.14.1] — 2026-08-24

### Fixed — `export_harness.py` 적대적 리뷰 후속 (2.14.0 배포본 결함)

2.14.0 설치 직후 `review-code`를 실제 코드에 붙여 돌린 리뷰에서 Critical 1건 포함
다수가 나왔다. **전부 재현을 확인하고** 고쳤다. 회귀 테스트 13종을 추가했고, 그중
12종은 수정 전 코드에서 red임을 확인했다.

- **[Critical] 마커를 구조가 아니라 문자열로 인식해 사용자 콘텐츠를 침묵 삭제했다.**
  `BEGIN_RE`에 줄 앵커도 메타 형식 제약도 없어서, 자기 `AGENTS.md`에
  `<!-- cck:begin ... -->` ~ `<!-- cck:end -->` 를 **인용해 설명**해 둔 소비자에게
  재생성을 돌리면 두 인용 사이의 문장이 삭제되고 exit 0이 났다. 그 뒤 `--check`는
  green을 돌려줘 흔적조차 남지 않았다. 이 도구의 대상 파일이 하필 "에이전트에게 CCK를
  설명하는 문서"라는 점에서 최악의 조합이었다. 이제 마커는 **줄 전체를 차지하고 메타가
  `rules-v… sha256:<64hex>` 형식일 때만** 블록으로 인정한다. 반대편 구멍(손으로
  망가뜨린 진짜 마커 줄이 산문으로 읽혀 낡은 규범이 고아로 남는 것)도 함께 막았다.
- **[High] 심링크 검사와 실제 쓰기가 각각 `realpath`를 해석했다 (TOCTOU).** 검사와 쓰기
  사이에 파일 읽기·조립이 끼므로 그 틈에 링크를 바꿔치기하면 검사받지 않은 경로에 쓴다.
  `_resolve_target()`으로 **한 번만** 해석해 그 결과를 끝까지 쓴다.
- `--check --stdout` 조합이 검사를 건너뛰고 무조건 exit 0을 냈다 — 완료 게이트가 플래그
  하나로 무력화됐다. argparse 상호배타로 강제한다.
- `--check`에는 심링크 탈출 검사가 없어 `AGENTS.md -> ~/.aws/credentials` 가 심긴
  체크아웃에서 CI가 검사만 돌려도 트리 밖 파일을 읽었다. 쓰기와 같은 검사를 건다.
- 기존 파일 권한을 무조건 `0644`로 덮어썼다 — `0600` 관리 파일이 world-readable이 되고
  `0664` 공동 편집 파일은 쓰기 권한을 잃었다. "마커 밖 불가침"은 메타데이터에도 적용된다.
- `PORTABLE` ∩ `NOT_PORTABLE` 교집합을 검사하지 않아, 재분류 시 한쪽 삭제를 빠뜨리면
  같은 룰을 싣고 동시에 "못 싣는다"고 광고하는 자기모순 문서가 나갔다.
- sha 입력에 생성기 템플릿이 빠져 있어, 헤더 문구만 바뀐 릴리스에서 게이트가 아무도
  손대지 않은 파일을 "본문 변조"로 지목했다. sha를 블록 전체의 지문으로 올리고 메시지를
  중립화했다.
- `rules/VERSION`이 검증 없이 마커 줄에 인터폴레이션됐다 — `>` 하나로 재생성으로도 못
  고치는 영구 red가 됐다. 형식 검증 + 읽기 실패 시 경고.
- 4-백틱 펜스 안의 `# 주석`이 헤딩으로 강등돼 **규범 원문이 조용히 바뀌었다**(sha에도
  안 잡힘). 펜스를 문자·길이까지 추적한다. h4+ 클램프와 setext 헤딩도 뭉개지 않고 멈춘다.
- `build_block`이 `OSError`/`UnicodeDecodeError`를 흘려 raw traceback으로 죽었다 —
  0/1/2 종료코드 계약이 우연에 맡겨졌다.
- `CLAUDE_PLUGIN_ROOT` 후보를 "`rules/` 존재"로만 판정해 남의 플러그인 규범을 CCK
  이름으로 내보낼 수 있었다. `plugin.json`의 name까지 확인한다.
- `--plugin-root`를 명시했는데 틀리면 exit 2(SKIPPED)로 내며 "지정하라"고 안내했다 —
  방금 지정한 사용자에게. 이제 exit 1 + 무엇이 틀렸는지 출력.
- `--target` 오타로 없는 디렉터리 트리를 생성했고, `git rev-parse` 실패 시 조용히 CWD로
  폴백해 서로 다른 두 개의 AGENTS.md를 만들 수 있었다.
- `PORTABLE`의 이식 사유가 어디에도 렌더되지 않는 죽은 데이터였다 — 생성물에 "이식된 룰"
  표로 싣고 sha에 포함한다.

### Changed

- 생성 블록에 "이식된 룰 + 사유" 표가 추가되고 sha 입력이 확장돼, `AGENTS.md`의
  블록 sha가 바뀐다. 소비자는 `/harness-export` 재실행으로 갱신한다(마커 밖은 불가침).

---

## [2.14.0] — 2026-08-23

### Added — ADE 벤치마킹 흡수 배치 (Orca · Paseo · Hermes)

2026년 상반기의 ADE(Orca, Paseo)와 하네스(Hermes Agent)를 조사해, **플러그인 레이어가
가져올 수 있는 것만** 흡수했다. 병렬 플릿·터미널·모바일 같은 앱 레이어는 명시적 비목표다
(네이티브 `isolation: worktree`·`ultracode`가 이미 흡수). 스펙:
`docs/specs/2026-08-22-ade-benchmark-absorption.md` (W-017).

- **`/harness-export` + `plugins/common/hooks/export_harness.py`** — kit 규범을 하네스 중립
  `AGENTS.md`로 내보낸다. Orca·Paseo에서 한 레포에 Codex·OpenCode·Pi를 함께 굴리면
  그 에이전트들은 CCK 규율 밖에서 동작했다 — 규율이 하네스마다 다른 레포는 규율이 없는
  레포와 같다. 이식 가능한 룰 8개는 **원문 그대로** 싣고(요약 금지), Claude Code
  프리미티브에 종속된 5개는 사유와 함께 제외 목록으로 남긴다. 마커 블록 밖의 사용자
  콘텐츠는 불가침이며, 마커 없는 기존 파일은 덮어쓰지 않고 append한다.
  구현은 **플러그인 안**(`hooks/`)에 둔다 — `scripts/`는 이 레포 전용이라 거기 두면
  설치자에게 배포되지 않아 스킬이 동작하지 않는다(`scripts/export-harness.sh`는 레포용 래퍼).
  `--check`는 마커의 자기신고 sha만이 아니라 **블록 전문**을 대조한다.
- **`/eval-forge` + `scripts/eval-forge.py`** — 관찰된 결함을 eval 시나리오로 굳힌다.
  생성 → `run.py --validate` 즉시 자기검증 → 실패 시 **원자적 롤백**. `--must-mention`은
  반복 지정으로 AND 묶음이 되어 "결함 하나만 찾고도 green"을 막는다. baseline은
  갱신하지 않는다. 검증 범위는 **그 시나리오로 한정**한다 — 전체 트리를 검증하면 무관한
  기존 시나리오의 결함이 방금 만든 정상 산출물을 지운다. 구현은 `scripts/`에 두는 레포
  개발용 도구다(`evals/` 자체가 배포되지 않으므로) — 소비자 환경에서는 exit 2로 멈춘다.
- **`/skill-forge`** — 어려운 문제를 푼 절차를 재사용 스킬 초안으로 승격한다(Hermes의
  trajectory→skill에 대응). 재현성·반복성·비중복 **3조건 AND**를 통과해야 하고,
  proposal-only다. kit의 학습 루프가 결함(ledger→self-improve)만 다루고 성공은
  버리던 비대칭을 메운다.
- **eval 커버리지 3 → 4 에이전트** — `security-scan/shared-tmp-and-hardcoded-token`
  시나리오를 `/eval-forge`로 도그푸딩 생성.

### Fixed

- **스킬의 `[건너뛰기 금지]` 단계가 Task 도구 부재로 파이프라인을 멈추던 문제 (F-038)** —
  `ToolSearch("select:TaskCreate,…")`가 아무것도 반환하지 않는 호스트/세션이 실재한다
  (2026-08-22 실측). brainstorming·plan-task·auto-dev가 이제 durable checklist로
  fail-open한다. 규율 SSOT: `skills/references/task-tools-fallback.md`.
- **`/review` 스킬에 리뷰어 도구 제약 명시** — `review-code`는 `disallowedTools`에 Bash가
  있어 `git diff`를 실행할 수 없다. 스킬이 그 사실을 경고하지 않아, 프롬프트가 diff 수집을
  에이전트에 위임하면 빈 리뷰가 돌아온다(2026-08-23 도그푸딩에서 실측). main이 diff를
  인라인으로 넘기도록 지시를 추가했다.
- **`AGENTS.md` 쓰기를 원자 교체로** — `write_text`는 truncate 후 write라 중단 시 대상이
  잘린 채 남는다. 소비자가 직접 쓴 규약이 함께 사는 파일이므로 부분 쓰기는 "마커 블록
  밖은 불가침"이라는 핵심 계약을 정면으로 깬다. `tmp + os.replace`(심링크는 realpath로
  보존)로 `checklist.py`와 관례를 통일했다.
- **마커 손상 시 거부** — `cck:begin`만 있고 `cck:end`가 없거나 블록이 여럿이면 덧붙이지
  않고 exit 1. 덧붙이면 begin이 둘이 되어 이후 `--check`가 옛 마커를 읽고, 재생성으로도
  고칠 수 없는 영구 red가 된다.
- **`export-harness.py`의 명시 경로 폴백 제거** — `--plugin-root`가 유효하지 않을 때
  자동 탐색으로 흘러가면 *지정한 것과 다른 레포의 규범*을 내보내고 성공을 보고한다.
  이제 exit 2로 멈춘다 (환경변수는 힌트로만 취급해 fail-open 유지).

### Fixed — pre-commit 훅이 ruff의 제외 범위를 무시하던 문제

`ruff check --fix "$f"` 처럼 **파일 경로를 명시**하면 ruff는 프로젝트 설정의
`extend-exclude`를 무시한다. 그래서 훅이 `evals/scenarios`의 *의도적 결함 픽스처*까지
린트했고(2.14.0 릴리스 커밋에서 S105/S108 노이즈로 실측), `--fix`가 붙어 있어
**그 결함을 자동 수정한 뒤 재스테이징할** 수 있었다 — eval 자산이 조용히 망가지는 경로다.
현재 픽스처에는 safe-fix 대상 위반이 없어 실제 손상은 없었으나(전수 확인), 새 픽스처가
`I`/`UP`/`C4`/`SIM` 위반을 하나라도 가지면 바로 발생한다. `--force-exclude`를 추가해
`ruff.toml`이 룰셋뿐 아니라 **범위**의 단일 소스라는 계약을 훅도 지키게 했다.

### Added — `run-evals.sh --report` (재실행 없는 baseline 비교)

`--compare`는 항상 전량을 **다시 실행**한 뒤 비교했다. 방금 12개 시나리오를 전부 돌린
직후에도 후퇴 여부를 보려면 API 비용을 한 번 더 내야 했다(2.14.0 릴리스 작업에서 실측).
실행과 판정은 분리 가능한 관심사다 — `--report <이미 기록된 리포트>` 로 재실행 없이
비교한다.

### Fixed — 적대적 리뷰 2라운드 (신규 코드 재검수)

1라운드 수정본을 같은 두 에이전트에 다시 걸었고, **1라운드에서 "고쳤다"고 선언한 항목 중
2건이 실질적으로 뚫려 있었다**. 특히 하나는 "게이트가 스스로를 무력화하는 것을 막겠다"는
검사 자체가 false-green이었다.

- **`pytest.ini` testpaths 커버리지 가드가 false-green이었다** — 정규식
  `^testpaths\s*=(.*?)(?=^\w|\Z)` 이 `#`(=`\w` 아님)에서 멈추지 않아 **주석 전문**을
  캡처했고, 주석의 낱말 `evals`가 `.split()`으로 "경로"가 됐다. 그 결과 `evals/tests`
  한 줄을 지워 **테스트 50건이 사라져도** 게이트는 초록이었다(실측: 333 → 283 passed,
  판정 green). INI 연속 줄 규칙대로 들여쓴 줄만 값으로 읽고 주석을 제거하도록 고쳤으며,
  파싱 실패는 red로 처리한다(검사 불가를 통과로 세지 않는다). `*_test.py`도 대상에 포함.
- **AST 위험 호출 검사가 import-time 실행 경로를 통째로 놓쳤다** — 최상위
  `FunctionDef`/`ClassDef`를 `continue`로 스킵해서, **클래스 본문·데코레이터 표현식·
  함수 기본 인자 값**(전부 import 시 실행된다)이 검사에서 빠졌다. `from os import *`,
  재바인딩(`f = os.system`), `getattr(os,"system")`, `importlib.import_module`도 통과했다
  — 우회 7종을 실측 확인. `_executed_at_import`로 "실행되는 위치"만 정확히 모으고,
  별칭·재바인딩·star-import·간접 호출을 추적하도록 재작성했다.
- **동시에 오탐 3종을 제거** — 1단 블록리스트가 `os.path.join`·`shutil.which`·
  `urllib.parse.urlparse`·`open`을 위험으로 판정해 **정상 fixture를 만들 수 없었다**.
  모듈을 2등급(ANY-call / ATTR-call)으로 나눠 위험 속성일 때만 걸리게 했다.
  오탐은 단순한 불편이 아니라 eval 커버리지 확대를 막는 결함이다.
- **우회 매트릭스를 회귀 테스트로 고정** — 1·2세대 검사 모두 "우회 케이스 테스트 0건"이
  진짜 결함이었다. 차단 16종 + 허용 9종을 `evals/tests/test_runner.py`에 표로 못박았다.
- **문서 카운트 검사가 첫 매치만 보던 문제** — 같은 파일에 같은 주장이 여러 번 있으면
  앞의 하나가 뒤를 가렸다. 실제로 `site/content/_index.md`의 설명줄이 본문 불릿을 가려
  불릿만 stale해도 초록이었다. 이제 **모든 매치**를 대조하고, 한국어/영어의 어순 차이
  (`19개 스킬` vs `스킬 **19개**`)를 각각 패턴으로 덮는다 — 한 패턴만 걸면 다른 표기가
  아예 매치되지 않아 조용히 skip된다. `site/`가 게이트 대상에 없던 사각지대도 함께 닫았다
  (실측: stale 주입 3종 전부 검출).
- **eval-forge가 타임아웃·인터럽트에서 계약된 종료코드를 안 돌려주던 문제** — 예외가
  `main` 밖으로 전파돼 도크·스킬이 약속한 exit 1 대신 트레이스백이 나갔다. 회귀 테스트가
  `contextlib.suppress`로 그 예외를 삼켜 **결함을 정당화**하고 있던 것도 함께 고쳤다.
- **스테이징 실패 시 빈 `scenarios/<agent>/`가 남던 문제** — `_rollback`이 `dest` 부재 시
  조기 return해 부모 정리를 건너뛰었다.
- **`cmd_write`가 심링크 탈출 검사 **전에** 트리 밖 파일을 읽던 순서** — 쓰기는 없었지만
  "변경 없음" 조기반환이 존재/내용 오라클로 새어나갔다. 검사를 읽기 앞으로 옮겼다.
- **`_atomic_write`의 tmp 이름이 예측 가능**하고 `FileExistsError`가 미포착이라 선점 시
  가용성이 깨졌다 → `tempfile.mkstemp`.
- **fixture 복사 제외 목록 확장** — 심링크가 아닌 *일반 파일* 자격증명(`credentials*`,
  `.netrc`, `.npmrc`, `*.jks` 등)이 그대로 복사됐다. 목록은 완전할 수 없다는 한계를
  코드 주석에 명시했다(최종 방어는 gitleaks + 리뷰).
- **빈 `AGENTS.md`가 PREAMBLE을 못 받던 비대칭**, `PREAMBLE`이 마커 오염 검사에서 빠져
  있던 점, 스펙↔구현 마커 형식 불일치, `eval-forge` 스킬의 금지 목록↔실제 검사 불일치도
  함께 정리했다.

### Fixed — 적대적 리뷰 후속 (review-code · security-scan 2종 병렬 검수)

- **드리프트 게이트가 블록 본문을 검증하지 않던 false-green** — `--check`가 마커의
  **자기신고 sha**만 봤다. 마커 줄을 그대로 둔 채 블록 안쪽을 지우거나 변조하면
  `verify-done §11`과 CI가 동시에 초록이 됐다 — 이 도구가 막겠다고 선언한 상황이 그대로
  게이트를 통과했다(머지 충돌 해결 중 블록 내부만 어긋나는 경우가 가장 현실적). 이제
  블록 전문을 대조한다.
- **eval-forge의 롤백 계약이 코드와 반대였던 문제** — 롤백이 `returncode != 0` 한 분기에만
  있어 타임아웃·인터럽트 경로로는 반쯤 만들어진 시나리오가 트리에 남았고, 그 순간부터
  `verify-done §10`이 영구 red였다. `try/finally` + 명시적 커밋 표시로 모든 실패 경로를 되감는다.
- **eval-forge의 `--agent` 경로 탈출 (보안 점검 PoC로 실증)** — `_agent_exists`의 rglob이
  `../../../README` 같은 값도 True로 판정해, 그 값이 경로 컴포넌트가 되어 `evals/scenarios/`
  **밖에** 디렉토리를 만들고 exit 0으로 성공까지 보고했다. 이름 화이트리스트 + 최종 경로
  봉쇄 확인으로 이중 차단.
- **fixture 심링크 역참조** — `shutil.copytree` 기본값이 링크 대상의 **내용**을 복사해,
  신뢰하지 않은 재현 번들의 링크 하나로 로컬 파일이 커밋되는 자산에 평문으로 흘러들 수
  있었다. `symlinks=True` + 제외 패턴 + 잔여 링크 제거, 단일 파일 심링크는 거부.
- **`run.py`의 모듈 스코프 위험 호출 검사가 별칭으로 우회되던 문제** — `import os as x;
  x.system(...)`, `from os import system` 이 전부 통과했다(실증). AST 기반 검사로 교체하고
  정규식은 파싱 불가 파일의 2차 방어로 남겼다. `--validate`가 `--agent`/`--scenario` 필터를
  조용히 무시하던 것도 함께 고쳤다.
- **`AGENTS.md` 심링크가 대상 트리 밖을 가리키면 기록 거부** — 심링크 보존은 kit 관례지만
  , 공유 워크스페이스에 심긴 링크는 그 관례를 트리 밖 임의 파일 쓰기로 바꾼다.
- **생성기 헤더의 마커 오염** — 헤더에 마커를 리터럴로 적으면 생성물의 마커가 둘이 되어
  이후 모든 실행이 손상으로 거부된다(**재생성으로도 못 고친다**). 실제로 한 번 발생했고,
  이제 룰 본문과 헤더 양쪽을 검사한다.
- **헤딩 강등이 h1 하나에만 적용되던 계층 역전** — 룰의 h2 하위 절이 블록 헤더와 형제가
  됐다. 코드펜스를 건너뛰며 전 헤딩을 균일 강등한다.
- **분류표 유령 엔트리 미검출** — 신규 룰 누락만 막고 삭제·개명된 룰의 잔존 엔트리는
  아무도 안 잡아, 소비자 AGENTS.md가 존재하지 않는 룰을 영구히 광고할 수 있었다. 양방향 검사.
- **`CLAUDE_PLUGIN_ROOT`가 스크립트 자기 위치보다 우선하던 문제** — 셸에 남은 다른
  플러그인의 값이 남의 규범을 내보낼 수 있었다. 자기 위치가 1순위.
- **롤백 실패를 성공으로 보고** — `rmtree(ignore_errors=True)` 뒤에 무조건 "롤백했다"를
  찍었다. 실패 시 잔존 경로를 명시적으로 보고한다.
- **`pytest.ini` self-disable** — `testpaths` 한 줄을 지우면 테스트 디렉토리 하나가 통째로
  사라지면서 로컬·CI 둘 다 green이었다. 게이트가 "실재 테스트 디렉토리 ⊆ testpaths"를 검사한다.
- **§11이 서로 다른 실패를 한 문장으로 뭉개고 stderr을 버리던 문제** — 분류 오류는
  재생성으로 안 고쳐지는데 "재생성하라"만 떠서 무한루프였다. 원인을 출력한다.
- **신규 eval 시나리오의 항진명제 판정** — 판정어에 fixture 원문 토큰(`/tmp`, `API_TOKEN`,
  그리고 작성 주석의 "시크릿"·"자격증명")이 섞여 있어, 코드를 인용만 해도 통과했다.
  판정어를 **진단해야만 나오는 표현**으로 교체하고 작성 노트를 fixture 밖으로 뺐다.
- **CLAUDE.md에 "정의 파일 수정은 현재 세션에 반영되지 않는다" 명시** — 에이전트·스킬은
  설치된 **플러그인 캐시**에서 로드되므로, 워킹트리를 고치고 바로 그 에이전트를 부르면
  옛 정의가 돈다. 2.14.0 개발 중 실제로 이 함정에 빠졌다(출력 계약 위치 수정을 같은
  세션에서 검증할 수 없었다). 세션 내 동작으로 정의 변경의 효과를 판정하지 말 것 —
  기계 검사(§12)나 파일 확인으로 검증한다. `scripts/`·`evals/`는 레포 로컬이라 즉시 반영된다.
- **서브에이전트 출력 계약이 문서 중간에 파묻혀 반환값이 유실되던 문제** — CLAUDE.md는
  "모든 에이전트는 delegation signal로 **끝난다**"고 규정하지만, `review-code`(뒤로 496줄)
  ·`implement-code`(309줄)·`plan-implementation`(186줄) 3종은 계약 뒤에 참고 자료가 길게
  이어져 컨텍스트의 끝을 차지했다. 실제로 `/review` 도그푸딩에서 리뷰 리포트가 **두 번**
  빈 채로 반환됐다. 세 파일 끝에 출력 계약 절을 추가하고("마지막 메시지 본문이 곧
  반환값이다"), `verify-done.sh` **§12** + CI 동일 검사로 위치를 기계 강제한다 — 산문
  규정만 두면 또 밀린다(F-027).
- **두 진입점의 응집도 부족 해소** — 리뷰 2종이 독립적으로 "분리 타당, 그리고 Critical
  2건이 바로 그 응집도 부족에서 나왔다"고 판정했다. `export_harness.main`은 서로 배타적인
  세 모드(stdout/check/write)를 한 몸에 담아, `--check`가 블록 경계를 언패킹만 하고 본문
  비교에 쓰지 않는 누락이 보이지 않았다 → `cmd_check`/`cmd_write`/`_compose`로 분리.
  `eval-forge.main`은 검증과 부작용이 섞여 롤백을 걸 자리가 없었다 → 순수 계획
  (`_plan` + `_resolve_dest`/`_resolve_task`/`_resolve_expect`/`_resolve_fixture`)과
  부작용을 갈랐다. 신규 코드의 C901 flag 0건.
- 소비자 경로 정정 — `/harness-export`·`task-tools-fallback`이 셸에 없을 수 있는
  `$CLAUDE_PLUGIN_ROOT`를 무가드로 쓰고, 배포되지 않는 `./scripts/checklist.sh`를 유일한
  대체 경로로 지정했다. 캐시 탐색 폴백을 명시했다.

### Changed

- **pytest 수집 대상 단일 소스화 (`pytest.ini`, F-023)** — 대상 목록이
  `verify-done.sh §4`와 CI에 각각 하드코딩돼 있어, 새 테스트 디렉토리를 한쪽만 등록하면
  "로컬은 돌고 CI는 안 도는" 조용한 구멍이 났다. 양쪽 모두 인자 없는 `pytest`를 호출한다.
- `scripts/verify-done.sh` **§11** 신설 — `AGENTS.md` 드리프트 게이트. CI에도 동일 명령.
- `CLAUDE.md` Contributing 체크리스트의 모순 정정 — 매니페스트에는 에이전트/스킬
  레지스트리가 없다(디렉토리 자동 발견). "plugin.json에 등록" 요구는 존재하지 않는
  필드를 가리키고 있었다.

---

## [2.13.0] — 2026-08-21

### Breaking — 에이전트 스코프 식별자에서 중복 세그먼트 제거

플러그인 서브에이전트는 `agents/` 아래 **하위 폴더가 스코프 식별자에 포함**된다.
`agents/dev/review-code/review-code.md`처럼 같은 이름 디렉토리에 파일 하나만 든 구조가
3건 남아 있어, 실제 호출명이 `claude-code-kit:dev:review-code:review-code`로 중복됐다.
2.13.0 이전 호출명을 직접 참조하는 코드가 있으면 아래 이름으로 고쳐야 한다.

- `agents/dev/review-code/review-code.md` → `agents/dev/review-code.md`
- `agents/dev/implement-code/implement-code.md` → `agents/dev/implement-code.md`
- `agents/dev/plan-implementation/plan-implementation.md` → `agents/dev/plan-implementation.md`

새 호출명: `claude-code-kit:dev:review-code` / `…:dev:implement-code` /
`…:dev:plan-implementation`.

**발견 경위(실측):** 위임 A/B 실험 트랜스크립트에서 짧은 이름
(`claude-code-kit:dev:review-code`) 호출이 실패한 뒤 중복 이름으로 재시도해 성공하는
로그가 잡혔다. 3회 중 1회에서 낭비 호출이 발생했다. 이 구조는 v1.1.1
(`fix: hook JSON validation + flatten references dir`)에서 참조 파일만 걷어내고 남은
빈 껍데기 디렉토리의 잔재다. 레포 내 긴 이름 참조는 0건이었고,
`evals/run.py`는 `rglob(f"{name}.md")`로 찾으므로 영향 없음(검증함).

### Added — rules: 서브에이전트 위임 상시 사전 승인 조항

`rules/agent-delegation-chain.md` 최상단에 상시 위임 승인 조항을 추가했다. SessionStart
훅의 `ALWAYS_RULES`가 이미 이 파일을 주입하므로 새 훅·새 파일 없이 적용된다.

**실측 근거(2026-08-21, n=3+3):** 동일 과제·동일 레포에서 승인문구 없는 조건 메인 루프
Agent 직접 호출 **0/3**, `--append-system-prompt`로 문단만 주입한 조건 **3/3**.
Fisher exact 단측 p=0.05 경계값 — 표본 확대 필요.

억제 원인은 미규명이다. Claude Code v2.1.219+의 서버사이드 섹션 `heron_brook`
("Do not call the AgentTool unless the user requested it", Opus 5 전용, 문서화된
opt-out 없음, anthropics/claude-code#80988)이 유력 후보이나 위 실측은 Sonnet 5
세션이라 해당 문자열이 부재했다. 조항은 그 인과를 전제하지 않는다 — 원인과 무관하게
위임 사전 승인은 이 프로젝트의 의도된 정책이다. 결정론적 보장이 필요한 단계는 Stop 훅이
담당한다.

### Fixed — 위임 승인 조항의 무제한 적용 (적대적 검수 후속)

초안 조항은 "에이전트가 정의된 일은 인라인으로 하지 마라"를 무제한으로 적었다. 그대로면
오타 한 줄 수정까지 서브에이전트를 띄워, 위임 왕복 비용만 쓰고 이득이 없는 호출이 생긴다.
인라인 예외를 둘로 못박았다 — (1) 파일·심볼·값을 이미 아는 단일 조회, (2) 한 파일 안의
기계적 수정(오타·포맷·import 정렬).

**분량을 기준으로 삼지 않은 것은 의도적이다.** 파일 하나짜리 코드 리뷰도 `review-code`가
할 일이고 실측에서 실제로 그렇게 동작했다. 기준은 크기가 아니라 **전용 에이전트가 정의된
일인가**이다. 에이전트 선택 기준은 `agent-system.md` §Agent Selection by Keyword가 SSOT —
조항에서 재정의하지 않고 참조만 한다(표 복제 = 드리프트 시작점).

### Fixed — multi-perspective-review frontmatter 파손

2.0.0에서 스킬 frontmatter의 비표준 필드 `allowed-tools`를 걷어낼 때 **키 줄만 지우고
값 리스트 6줄이 남았다**. YAML 파싱 에러는 아니지만 plain scalar multiline으로 흡수되어
`effort` 값이 `'max - Read - Glob - Grep - Task - Write - AskUserQuestion'`이 됐다
(유효값은 `low|medium|high|xhigh|max`). 2.0.0의 원래 의도대로 고아 리스트를 제거해
`effort: max`로 복구했다.

---

## [2.12.4] — 2026-08-17

### Added — session-check: 프로젝트 디렉토리 이동 후의 stale venv 감지

이 레포를 다른 경로로 옮기면서 실제로 밟은 침묵 실패다. venv 콘솔 스크립트
(`pytest`·`pip`·`ruff` …)에는 생성 시점의 **절대경로** shebang이 구워지는데,
`bin/python`은 shebang 없는 진짜 바이너리라 계속 동작한다. 그래서 증상이
"python은 되는데 pytest만 `bad interpreter`"로 쪼개지고, 옛 경로가 아직 살아 있으면
**옛 venv의 site-packages로 조용히** 실행된다. 어떤 파이썬 프로젝트든 디렉토리를
옮기거나 복사하면 걸리는 소비자 환경 결함이라 훅이 한 줄 경고로 관측 가능하게 만든다.

- `setup/session-check.py`: repo 루트의 `.venv`/`venv`에서 콘솔 스크립트 shebang을
  훑어(앞쪽 40개 제한) 절대경로 python이 이 venv의 `bin` 밖을 가리키면 경고 + 재생성
  명령 안내. SessionStart 계약대로 **fail-open**(경고만, 세션 차단 없음).
- **오탐 억제**: 판정은 심링크를 따라가지 않는 **디렉토리 기준** 비교다. venv의
  `bin/python`은 보통 시스템 python으로 가는 심링크라, shebang 경로를 그대로
  `resolve()`하면 멀쩡한 venv가 전부 stale로 잡힌다 (이 레포 실제 venv에서 재현 →
  회귀 테스트로 고정). 절대경로 python shebang이 없는 relocatable venv
  (`uv --relocatable`의 `#!/bin/sh` 래퍼)는 판정 불가로 보고 **침묵**한다.
- 경고 문자열은 shebang을 `!r`로 감싼다 — 파일에서 읽은 값이 터미널 이스케이프를
  그대로 stderr에 흘리지 못하게 (`core.hooksPath` 경고와 동일 관례).
- **판정 불가 shebang은 예외를 흘리지 않는다**: NUL이 박힌 경로에서 `os.path.realpath`는
  OSError가 아니라 **ValueError**를 낸다. 이게 새어나가면 같은 try 안의 후속 검사
  (dual-load 감지)가 통째로 사라져, 침묵 실패를 막으려던 코드가 새 침묵 실패를 만든다.
  적대적 검수에서 재현 → `except (OSError, ValueError)` + 회귀 테스트로 고정.
- 회귀 테스트 9건 추가 (stale 감지 / `venv` 디렉토리 / 정상 venv / 심링크 python /
  relocatable / venv 부재 / 이스케이프 / SessionStart 계약 / 깨진 shebang 격리) —
  총 287 passed. python 3.9 로드·런타임 동작 확인.

### Fixed — 룰 해설본 미러가 조용히 드리프트했다 (그중 1건은 north-star와 모순)

`docs/architecture/rules/`(9)는 주입 룰의 장문 해설본인데(W-004 신설), 둘을 잇는 장치가
없어 어긋난 걸 아무도 몰랐다. 감사 결과 3건이 주입 룰보다 뒤처져 있었다:

- **`planning-check`** — 해설본이 "1순위 docs/planning → 2순위 Notion MCP → 3순위 Figma
  MCP" 로 **MCP 설치를 전제**했다. 주입 룰은 v2.10.4에서 이미 "(설치돼 있으면) … 없으면
  건너뛴다 — 설치를 가정하지 않는다"로 고쳐졌는데 해설본만 옛말이었다. consumer-first
  north-star와 정면 모순이라 3건 중 가장 무겁다.
- **`task-resume`** — `{"phase": "brainstorming"}` 고아 태스크 처리(v2.10.3) 누락.
- **`agent-delegation-chain`** — leaf 중첩 금지·`ultracode` 위임 근거(2.6.0) 누락.
  해설본이 DELEGATION_SIGNAL 형식을 **재정의**하는 구조라 드리프트가 재발하기 쉬웠다 →
  "형식의 정본은 주입 룰, 여기는 설명"임을 머리말에 명시.

- **재발 방지**: `docs/architecture/rules/MIRROR.sha256` — 해설본이 마지막으로 반영한
  주입 룰의 sha256을 기록. `scripts/sync-rule-mirror.sh`가 검사/재생성의 단일 소스이고
  `verify-done §7`이 이를 호출한다(드리프트 주입·복원으로 양방향 확인). 재생성은 의식적
  행위여야 해서 자동 갱신하지 않는다 — 자동이면 검사가 무의미하다.
- 미러가 없는 4개 룰(definition-of-done·feedback-loop·loop-engineering·parallel-worktree)은
  **의도적 무미러**임을 CLAUDE.md에 명시. "빠뜨린 것"과 구분되지 않던 상태를 없앤다.

### Fixed — GitHub Actions Node 20 런타임 (2026-09-16 제거 예정)

CI가 green이면서 남기던 deprecation annotation을 추적했더니 **시한이 있었다**: 2026-06-02에
러너 기본이 Node 24로 바뀌었고(현재는 강제 실행으로 통과 중), **2026-09-16에 Node 20이
러너에서 완전 제거**된다. 그때 CI는 코드 변경 없이 죽는다.

- 핀된 액션 6종을 Node 24 런타임 버전으로 상향(SHA 핀 유지):
  `checkout` v4→v7, `setup-python` v5→v7, `gitleaks-action` v2→v3,
  `configure-pages` v5→v6, `upload-pages-artifact` v3→v5, `deploy-pages` v4→v5.
- gitleaks v3는 릴리스 노트상 **런타임 이관만**(입출력·동작 변경 없음)이라 설정 무변경.
- `pages.yml`도 함께 상향 — 처음엔 `validate.yml`만 보고 있었는데 워크플로가 2개였다.

### Fixed — 릴리스 태그가 20개 릴리스 동안 조용히 끊겨 있었다

태그는 v2.10.4(2026-07-09)에서 멈췄고 이후 2.10.5~2.12.3의 **20개 릴리스가 무태그**였다.
릴리스 체크리스트에 태그 항목이 아예 없어서, 관례가 끊긴 사실을 아무도 몰랐다.

- 20개 태그 소급 부여. 규칙: **plugin.json이 그 버전이었던 마지막 커밋**(= 해당 버전
  소비자가 받을 수 있었던 트리). 부여 전 28개 태그 전부 "태그가 가리키는 커밋의
  plugin.json == 태그 버전"으로 검증(불일치 0).
- 기존 8개 태그는 규칙이 제각각(범프 커밋/마지막 커밋/그 외)이라 **건드리지 않았다** —
  이미 공개된 ref를 옮기는 건 파괴적이고 얻는 게 없다. CLAUDE.md에 그 사실을 명시.
- `v2.6.0-with-domains`는 v2.6.0과 동일 커밋이라 중복으로 보였으나 CHANGELOG와
  `docs/marketplace-submission.md`가 **참조 중**이라 유지했다(지웠으면 문서가 깨진다).
- `verify-done.sh §6`에 기계 검사 추가: CHANGELOG의 과거 릴리스에 태그가 없으면 FAIL.
  최상단(작업 중 버전)은 제외. 산문 규율은 또 끊긴다 — 그래서 게이트로 옮겼다.

### Security — 게이트가 world-writable `/tmp` 경로를 인터프리터로 실행할 수 있었다

`verify-done.sh`와 `evals/run.py`가 pytest/ruff 후보로 `/tmp/ckkit-venv/bin/{python,ruff}`를
탐색했다. `/tmp`는 world-writable이고 이름이 예측 가능하므로, 아무 로컬 사용자나 거기에
인터프리터를 심어두면 **게이트 실행자의 권한으로 임의 코드가 돌 수 있었다**. 같은
스크립트가 임시 출력에 대해서는 "예측 가능한 /tmp 고정 이름 = 심링크 선점 위험"이라며
`mktemp`를 쓰고 있었다 — 실행 대상이면 위험은 오히려 더 크다.

- 세 곳 전부 제거. 게다가 **죽은 참조**였다: `evals/run.py` 주석은 "verify-done.sh가
  만드는 공용 venv"라고 주장했지만 그걸 만드는 코드는 레포 어디에도 없다.
- `# noqa: S108`(bandit hardcoded-tmp 억제)도 함께 제거 — 이제 파이썬 쪽 재발은
  ruff가 자동으로 잡는다. 레포 밖 venv는 activate해서 `python3` 후보로 잡으면 된다.

### Added — 셸 스크립트 린트 (`scripts/lint-shell.sh` + CI, 핀+체크섬)

완료 게이트와 설치 스크립트가 셸인데 파이썬만 린트하고 있었다 — "완료"를 판정하는
코드가 정작 무검사였다.

- `scripts/lint-shell.sh`가 **단일 소스**: 대상 목록(확장자 + shebang 판별, 그래서
  확장자 없는 `setup/pre-commit`도 포함)과 심각도 임계값(`-S warning`)을 여기만 둔다.
  CI와 `verify-done.sh §3b`가 이 커맨드를 그대로 호출 — 목록 이중화 금지(F-023).
- shellcheck는 `.shellcheck-version`에 핀 + CI가 릴리스 tarball sha256 검증. 러너
  기본 shellcheck는 버전이 떠다녀 "코드 변경 없이 red"를 만든다.
- 미설치는 로컬에서 **노란 줄**(권위 판정은 핀된 CI), 위반은 red. green 위장 없음.
- 검출된 warning 5건 수정. 그중 `verify-done.sh`의 MCP 가드는 `for f in $(find …)`
  → `while read -d '' … done < <(find -print0)`로 바꿨다. **파이프가 아니라 프로세스
  치환**이어야 한다 — `find | while`로 썼으면 루프가 서브셸에서 돌아 `red()`의 FAIL
  증가가 통째로 버려지는 false-green이 됐다. 위반 주입으로 검출 동작 재확인.

### Changed — pytest도 버전을 핀한다 (`.pytest-version`)

CI가 `pip install pytest`로 **핀 없이** 설치하고 있었다. 레포가 ruff를 핀한 이유
("도구 기본 동작이 릴리스마다 바뀌어 코드 변경 없이 CI가 red")가 테스트 러너에는
적용돼 있지 않았다 — pytest는 수집·fixture·deprecation 처리가 메이저마다 달라진다.

- `.pytest-version`(= 9.1.1) 추가, CI가 정확히 그 버전 설치.
- `verify-done.sh §4`: 파일 부재는 red, 로컬 pytest ≠ 핀은 노란 경고 (§3 ruff와 대칭).
- 두 핀은 dev venv 재현의 단일 소스이기도 하다 — 이번 디렉토리 이동에서 venv를
  복구할 때 설치 목록을 옛 freeze에서 고고학하듯 되살려야 했던 부채를 없앤다.

## [2.12.3] — 2026-08-07

### Fixed — protect-sensitive: 파일명 'token' substring 오탐 완화 (외부 사용 보고)

- **보고된 실사례**: 공개 블로그 글 `token-efficiency-discipline.md`가 파일명에
  'token' 부분 문자열이 있다는 이유만으로 Read/Edit 차단됨.
- **파일명 매칭 협소화**: token/tokens/password/passwords 4패턴을 substring 매치
  (`(^|/|_|-)token($|\.|_|-)`)에서 **자격증명 관례 결합형**으로 교체 —
  차단 유지: 정확명(`token`, `token.json`, `.token`, `passwords.yml`) + 접미 결합
  (`api_token.json`, `github-token.txt`, `user-password.txt`).
  통과로 전환: 산문 복합어(`token-efficiency-*.md`, `password-reset-flow.md`)와
  소스 파일(`tokenizer.py`, `oauth/token.py` — oauthlib 관례).
- **콘텐츠 스캔은 무변경**: 실제 시크릿 형식(HIGH_CONFIDENCE_CONTENT_PATTERNS)
  스캔과 커밋 시 gitleaks가 협소화의 잔여 리스크(예: `token_prod.json` 접두 복합형)
  를 커버하는 최종 방어선.
- **회귀 테스트 2건 추가**: 정탐 8케이스 유지 + 오탐 6케이스 통과 고정 (총 66 passed).

## [2.12.2] — 2026-08-03

2.12.1 직후 적대적 리뷰에서 나온 결함들. **자기 게이트를 자기 원칙으로 검사**한 결과다.

### Fixed — 소비자 세션에 주입되는 규칙이 이 레포에서만 성립했다 (north-star 위반)

`rules/`는 **모든 소비자 세션에 항상 주입**된다. 그런데 `definition-of-done`의 Iron Law가
`scripts/verify-done.sh` 실행을 지시하고 기계 검사 목록도 kit 전용 항목(plugin.json·
agent frontmatter·marketplace.json)이었다 — 소비자 프로젝트엔 없는 것들이라, 규칙이
"실행 불가 → 규율 자체를 건너뛸 구실"로 작동할 수 있었다.

- Iron Law 1항을 **"그 프로젝트의 검증 명령을 fresh run"**으로 일반화(이 레포는
  `verify-done.sh`가 그 구현). "스크립트가 없다는 사실이 검증을 면제하지 않는다"를 명시.
- 기계 검사 목록에 "이 kit 레포 기준 — 다른 프로젝트는 대응물로 치환, 최소 테스트·린트·
  시크릿·문서sync는 불변" 프레이밍 추가. `loop-engineering` 종료 조건도 동일 정합화.

### Fixed — 2.12.1이 새로 심은 결함 2건

- **`ruff.toml`의 `exclude`가 ruff 기본 제외 목록을 대체**하고 있었다(`.venv`·
  `node_modules`·`dist` …). 지금은 respect-gitignore가 우연히 가려줄 뿐, gitignore되지
  않은 벤더 디렉토리 하나면 수천 건을 린트한다 → **`extend-exclude`**로 교정.
- **`python39-compat` 잡이 에러 문자열 grep 판정**이었다 — 예상 못 한 예외 유형은
  통과시키는 false-green 통로. `runpy`로 모듈 top-level만 실행하고 **종료코드로 판정**
  하도록 교체(`__main__` 가드 덕에 main()은 돌지 않아 결정론적).

### Added — 침묵 실패를 관측 가능하게

- **`session-check.py`: python3 < 3.9 경고**. 훅은 fail-open이라 구버전에선 *아무 메시지
  없이* 사라진다 — 세션 시작에 한 줄로 알린다.
- **`verify-done.sh` §3: `ruff.toml`·`.ruff-version` 존재 가드**. 설정이 사라지면 ruff가
  개발자 전역 설정으로 조용히 폴백해 "로컬 green·CI red"가 부활한다(전제 소실 = FAIL).
- **README**: 훅이 요구하는 python 3.9+ 명시(소비자 사전 조건).
- `evals/run.py`: `build_claude_command`의 죽은 `timeout` 파라미터 제거(타임아웃은
  호출부 `subprocess.run(timeout=)`이 강제 — 인자는 어디에도 쓰이지 않았다).

## [2.12.1] — 2026-08-03

### Fixed — 소비자 python 3.9에서 죽어 있던 훅 4종 (F-037)

훅은 **소비자 머신의 `python3`**로 실행된다. macOS 기본 python3는 여전히 3.9.6인데,
훅 소스가 런타임 평가되는 PEP 604 어노테이션(`str | None`)을 쓰고 있어 그 환경에선
import 시점에 `TypeError`로 즉사했다 — `auto-format` · `stop-validator` · `checklist` ·
`feedback_ledger`. 훅은 fail-open이라 **오류 없이 조용히 아무 일도 안 하는** 상태였다.

- 해당 모듈에 `from __future__ import annotations` 추가 → 3.10 문법을 유지하면서 3.9 동작.
- **재발 방지 2중**: ruff `FA` 룰(정적) + `python39-compat` CI 잡(3.9에서 전 훅 실제 로드).
- 검증: 훅/스크립트 9개 전부 python 3.9.6에서 기동 확인, pytest 272건 3.9·3.12 양쪽 통과.

### Fixed — 린트 판정이 환경마다 갈리던 구조 (F-036)

2.12.0 푸시 직후 CI가 red였다(run 30794529796, 105건). 코드 문제가 아니라 **도구 기본값
드리프트**였다: 레포에 ruff 설정이 없어 로컬은 개발자 전역 설정(`~/.config/ruff/ruff.toml`
— 이 kit이 배포하는 바로 그 파일)을 집어 green, CI는 설정 없이 ruff 0.16의 확장된 기본
룰셋을 그대로 맞아 red. 로컬 게이트가 개인 환경에 의존하고 있었다는 뜻이다.

- **`ruff.toml` 신설(SSOT)**: 룰 집합·제외 범위·소비자 floor를 명시. 프로젝트 config가
  있으면 ruff는 전역 config를 무시하므로 환경 비의존이 된다. 기본값 상속도 금지 —
  기본 룰셋은 버전마다 다르다(0.15는 E402 on, 0.16은 off).
- **`.ruff-version` 핀**: CI가 이 버전을 설치, `verify-done.sh`는 로컬 버전이 다르면 경고.
- **커맨드 단일화**: CI·게이트 모두 `ruff check .` — 대상 목록 복제 제거(F-023).
- 판정 동일성 실측: ruff 0.15.10과 0.16.1이 같은 룰셋에서 동일 결과.

### Changed — 드러난 실결함 수정 (린트 확장으로 노출된 것들)

- `subprocess.run` 28곳에 **명시적 `check=False`** (묵시적 기본값 의존 제거, AST 기반 삽입).
- `hashlib.md5(..., usedforsecurity=False)` 5곳 — 락/마커 지문 용도임을 명시(FIPS 환경 대응).
- `date.today()` → tz 명시 로컬 날짜, `Path().resolve()` → `Path.cwd()`, 암묵적 `Optional`
  제거, 미사용 `noqa`·언팩 변수 정리, 셰뱅 있는 스크립트 6개 실행권한 부여.
- fail-open 계약(광범위 except)·eval fixture의 **의도된** 결함은 수정 대상이 아니라
  `ruff.toml`에 근거와 함께 명문화 — noqa 40여 개 살포 대신 정책 1곳.
- 훅 tests·evals 포함 **레포 전체가 린트 대상**이 됐다(기존엔 `hooks/`+`evals/`만).

## [2.12.0] — 2026-07-20

### Added — 비신뢰 텍스트 방어 프레이밍 일관 적용 (호스트 무관)

외부·타세션 텍스트가 컨텍스트로 들어오는 4개 경로에 동일 규율을 적용. 근거는 외부
리서치가 아니라 **kit 자신의 원장**: `F-024`(자동화 루프의 자유텍스트 입력은 데이터로만)
· `F-028`(주입 컨텍스트는 정제·인용 인코딩·방어 프레이밍 선치) — 기존 STALE TASKS
구현만 준수하고 나머지가 미준수였던 것을 정합화. 외부 근거로 OWASP Agentic AI Top 10
**ASI06**(Memory & Context Poisoning: 프롬프트 인젝션과 달리 영속됨) 참조.

- **`using-claude-code-kit` 스킬 — "비신뢰 텍스트 취급" 절 신설(단일 소스)**:
  인용 인코딩 · 방어 프레이밍 선치 · 지시 불이행 3규율 + **요약/distill 단계에도 동일 적용**
  (외부 텍스트를 읽는 LLM 단계 자체가 인젝션 표면). **툴 중립 서술** — 이 SKILL.md를
  읽는 어떤 호스트(Codex·Antigravity 등)에서도 동일 적용되며, 호스트별 강제 차이
  (kit 훅 유무)를 절 안에 명시.
- **`session-start.py` LESSONS 주입에 방어 프레이밍 선치**: 기존 STALE TASKS 와 동형
  (페이로드보다 *먼저* 비신뢰 선언 — 순서가 방어의 핵심). 원장 부재 시 fail-open 불변.
  회귀 테스트 2건 추가(선치 순서 + fail-open).
- **`web-research` 스킬 / `research-external` 에이전트**: 외부 문서 취급 규율 참조 추가.
  프로즈는 복제하지 않고 단일 소스를 가리킨다(`F-023` 복제→드리프트 회피).
- 메모리 MCP 절: **recall 결과도 비신뢰 데이터**임을 명시(2.11.0 가이드 보강).

### Fixed — 문서 stale 정정 (외부 검증 2026-07-29 반영)

- **`plugins/common/README.md`**: (1) 없는 마켓플레이스명 `claude-plugins-official` →
  실제 두 채널(community `claude-community` / direct `claude-code-kit`)로 정정,
  (2) 삭제된 도메인 플러그인(frontend/infra/ops/data/integration) 안내 제거 — 현행
  구조(common + project-local 2-tier) 반영, (3) Skills 표를 "Key Skills"(부분 목록,
  16 total 명시)로 라벨해 12행이 총개수로 오독되던 문제 해소.
- 루트 `CLAUDE.md`/`README.md`는 이미 현행(common 단독·33 agents·16 skills)이었음을 실측 확인 — stale은 `plugins/common/README.md` 한정.

### Added — CI 카운트 drift 가드 + 카탈로그 전파 문서화

- **`scripts/check_doc_counts.py` 신설 — 카운트 검사 단일 소스(F-023)**:
  agents(frontmatter `name:` 보유 .md)/skills/rules 실측 ↔ 문서 수기 카운트 대조.
  `verify-done.sh §6`(로컬 게이트)과 `.github/workflows/validate.yml`(CI, 신규 스텝)이
  **같은 스크립트를 호출** — bash/CI 이중 구현으로 인한 검사 로직 자체의 드리프트 차단.
  §6의 기존 시맨틱 계승(주장 없음=skip, What's Included 표 행 부재=실패 — F-022
  anti self-disable) + 커버리지 확장(CLAUDE.md agents, plugins/common/README.md).
  그간 로컬 게이트에만 있던 카운트 검사가 **CI(모든 push/PR)로 승격** — 개수 drift 재발 차단.
  음성 테스트(drift 주입 픽스처 → exit 1) 검증.
- **`CLAUDE.md` Release Checklist**: 배포 채널별 전파 모델 명문화 — direct 마켓은 즉시,
  community 카탈로그는 read-only 미러·SHA 핀·nightly sync(재제출 불요, 직접 PR 자동 닫힘).
  1차 출처(카탈로그 repo README) 확인.

## [2.11.0] — 2026-07-20

### Added — Interoperability as a first-class goal (memory MCP interop)

- **`using-claude-code-kit` 스킬**: "메모리 MCP와 함께 쓸 때" 섹션 신설 — 세션에
  메모리형 MCP 툴(`recall`/`search`/`remember` 류, 서버 이름 불문)이 있으면
  **계획 전 recall → 완료 후 remember** 패턴으로 활용, 없으면 완전 스킵
  (fail-open, consumer-first). 특정 서버 가정·하드코딩 없음.
- **CLAUDE.md**: 상호운용성을 명시적 설계 목표로 승격 — never assume / never
  conflict / leverage generically 3원칙. MCP 활용 가이드는 스킬에만, 에이전트
  `tools:` 허용목록엔 금지(기존 규칙 재확인).
- **README**: "Works with your MCPs" 섹션 추가 — 메모리 MCP(basic-memory,
  agentcairn, 사내/개인 서버 등)와의 일반화된 결합 방식 안내.

### Added — review: 복잡도 하이브리드 가드 (advisory 전용)

- **`review` 스킬 0.5단계 신설**: 결정론 flag(`ruff check --select C901`, mccabe
  기본 임계 10) → review-code 에이전트가 **모듈 경계·IN/OUT 계약 분리 타당성**
  관점으로만 판단하는 2단 하이브리드. 복잡도 수치·줄수 단독 리젝 금지, 응집적이면
  flag 기각(근거 명시). 어떤 경우에도 리뷰를 실패시키지 않는 advisory —
  전역 blocking lint(E,F)·stop-validator 무접촉(소비자 기존 코드 차단 없음),
  ruff 미설치 시 스킵(fail-open). CLI `--select`가 프로젝트 lint 설정과 독립임을
  실측 검증(select=E,F 프로젝트에서 C901 flag + blocking 경로 통과 확인).

## [2.10.5] — 2026-07-17

### Fixed — protect-sensitive: env 템플릿 과차단 예외 (소비자 보고, W-016)

- **env 템플릿 허용**: `.env.example` / `.env.sample` / `.env.template` / `.env.dist`
  (중간 변형 `.env.local.example` 포함)를 정확-suffix 매치(`ENV_TEMPLATE_RE`)로만
  보호 대상에서 제외 — placeholder 전용·git-tracked이 정상인 템플릿 파일의
  Read/Edit까지 차단하던 false positive 해소 (소비자 프로젝트 보고).
  `.env.example.backup` 같은 뒤붙임 변형과 실제 `.env*`는 계속 차단.
- **symlink 방어 무회귀 (ATK-007)**: 예외를 `check_protected()` 내부에 배치해
  main()의 원본 경로 → realpath 2단 검사가 예외에도 일관 적용 — 템플릿 이름의
  symlink가 실제 `.env`를 가리키면 realpath 검사가 차단 (회귀 테스트 고정).
- **예외 역이용 완화 (best-effort)**: 템플릿 경로에 대한 쓰기(Edit/MultiEdit/Write/
  NotebookEdit) 콘텐츠를 형식-확정 패턴(`HIGH_CONFIDENCE_CONTENT_PATTERNS`:
  sk-/sk-ant-/sk_live·test_/AIza/AKIA/ghp_/PEM/JWT/DB URI 등)으로 스캔해 실제 형식의
  시크릿 기록을 차단. placeholder(`API_KEY=your_key_here`)는 통과 — 휴리스틱 할당
  패턴은 이 스캔에서 제외. 형식-확정 패턴 밖 시크릿의 **최종 방어선은 커밋 시
  gitleaks**(이 스캔은 best-effort 사전 차단). message/broadcast 스캔은 기존 전체
  패턴 그대로 (동작 불변, 합집합 구성 테스트로 고정).
- **적대적 검증 반영**: 예외 정규식 좌측 `(^|/)` 앵커(ATK-001 —
  `credentials.env.example`류 보호 파일명 재개방 차단), 쓰기 스캔 payload `str()`
  강제(ATK-002 — 비-str payload의 fail-open 우회 차단), 스캔의 realpath 게이트
  (symlink 경유 쓰기 우회 차단).
- 회귀 테스트 30건 추가 — protect-sensitive 64건, hooks 스위트 220 passed.

## [2.10.4] — 2026-07-09

### Fixed — MCP 이식성: MCP는 스킬에, 배포 에이전트는 빌트인만 (소비자 환각 차단)

- **research-external**: MCP(Context7/Exa/Tavily)를 자기 능력으로 지시하던 죽은 산문 제거 —
  이 에이전트의 `tools:` allowlist는 MCP를 부여하지 않으므로 실행 불가한 지시였다. MCP
  리서치는 `web-research` 스킬로 위임하도록 명시.
- **web-research 스킬**: MCP 부재/미인증/타임아웃 시 WebSearch/WebFetch로 폴백하는 규율
  추가 — MCP 상시존재 가정 제거, 결과 날조 금지.
- **rules/mcp-usage.md**: "MCP는 스킬에 산다" 원칙 명문화 — 배포 에이전트 `tools:`에
  `mcp__*` 금지(미설치 project-scoped MCP는 환각/hard-fail, CC #13898). "ALWAYS MCP"
  문구를 "가용 시 우선 + 폴백"으로 완화(MCP Servers·Required Rules 절 포함).
- **저장소 전역 정합**(적대 리뷰 CONDITIONAL 리메디에이션): `implement-api.md`의 죽은
  Context7 지시 제거→스킬 위임, `docs/architecture/rules/mcp-usage.md` 미러 동기화(에이전트
  frontmatter MCP 배선 예시·부재 `db-tunnel.sh` 참조·`NEVER WebFetch` 제거), `planning-check.md`
  Notion/Figma MCP 조건부화, agent-system 미러 스테일 카운트(16 skills/13 rules) 정정.
- **verify-done.sh 산문 가드 추가**: 에이전트 frontmatter뿐 아니라 description/body가 MCP를
  자기 능력으로 지시하는 것도 검출(frontmatter-only 가드의 맹점 보완).

### Added — 거버넌스: 소비자-우선 north-star + 이종 fan-out 규율

- **CLAUDE.md · README**: "Who this is for" 설계 north-star + Contributing 체크리스트 게이트
  (소비자 환경 작동 검증 · 에이전트 allowlist `mcp__*` 금지) — 소비자 cwd에서 깨지는
  설계를 리뷰에서 차단.
- **rules/agent-system.md**(+ docs/architecture 미러): 적대적 병렬 검증은 general-purpose
  복제가 아니라 이종 전용 에이전트(review-code + devils-advocate + verify-integration)
  fan-out 규율 추가 — 관점 다양성(편향 방지) 보존.
- feedback ledger에 general-purpose-over-specialized 사건 frequency=1 기록 — 인포스먼트
  (신규 에이전트/훅)는 재발 2회+에서만 재검토(과적합 방지).

## [2.10.3] — 2026-07-07

### Added — 태스크 잔존의 기계적 재발 감지 (프롬프트 규율의 안전망)

- session-start `load_stale_tasks()` 신설 + 재감사 A/B(H1·M7·L6) 전건 반영:
  - **스코프 분류**: 세션↔프로젝트를 `~/.claude/projects/<slug>/<sess>.jsonl`로 판정 —
    이 프로젝트 잔존만 상세(예시 3건, 첫 보고 1줄 요약 규정), 타 프로젝트는 집계
    1줄(능동 보고 금지) — "판단 불가 조건" 노이즈 제거 (재감사 B/M1·M2)
  - **인젝션 방어**: subject는 비신뢰 텍스트 — 제어문자/개행 제거·`===` 마커 무력화·
    인용 인코딩, 방어 프레이밍을 예시 앞에 배치, E2E 무력화 실증 (재감사 A/H1)
  - **나이 필터**(기본 14일, `CKKIT_STALE_TASKS_DAYS`) + mtime 최신 우선 선별 +
    세션/파일 상한 — best-effort 명시 (재감사 A/M3, B/M2)
  - 설계 게이트 대기(brainstorming) 태스크는 정상 in_progress 예외 명시 + task-resume에
    고아 태스크 재개/정리 경로 신설 (재감사 B/M3)
  - fail-open, 현재 세션 제외(디렉토리명=session_id 실측 검증), `CKKIT_STALE_TASKS=0`
- verify-done CHECKSUMS 게이트를 **집합 동등성**으로 강화(신규 파일 맹점 제거) +
  shasum/sha256sum 폴백 (재감사 A/M2·L7). hooks.json session-start timeout 10s.
- CLAUDE.md 릴리스 체크리스트에 CHECKSUMS 재생성 명문화("드리프트 감지기" 성격 포함).
- (기록 보완) ba531b2 native-absorption 갱신: 8행 watch 격상 + DoD·self-improve 2행
  추가 — 원장 규칙의 CHANGELOG 기록 의무 사후 이행 (재감사 B/L5).
- E2E 실증: 첫 실행에서 기존 잔존 15건/4세션 감지. 테스트 8케이스, 총 240 green.

---

## [2.10.2] — 2026-07-07

### Fixed — 태스크 잔존 버그 (마지막 태스크 미완료 마킹)

증상: 작업이 끝나도 마지막 태스크가 in_progress/pending으로 영구 잔존 (사용자 보고,
~/.claude/tasks/ 실측으로 재현 확인 — 잔존 파일이 남은 세션은 전부 이 패턴).

근본 원인: "마지막 태스크"는 내용이 보고/마무리라 마킹 시점이 턴 종료와 겹치는데,
- auto-dev T-merge가 `TaskUpdate(completed)`를 **사용자 보고 뒤**(4단계)에 배치 —
  보고 후 턴이 사용자 입력 대기로 끝나 마킹이 증발 (순서 결함)
- brainstorming은 완료 마킹 지시 자체가 없음, plan-task는 마지막 [Planning] 태스크
  마감 지시 부재
- 이를 잡는 상시 규율/게이트 부재

수정:
- auto-dev: T-merge 마킹을 사용자 보고 **앞**으로 재배치 + 잔존 태스크 정리 지시
- brainstorming: 항목별 즉시 마킹 + 마지막 항목은 "invoke 직전 마킹" 규약 신설
- plan-task Step 4: 핸드오프 전 [Planning]/[Brainstorm] 잔존분 일괄 마감 (Step 4-0)
- definition-of-done(상시 주입 룰): "Task 마감 규율" 신설 — 보고·핸드오프·대기로
  턴을 끝내기 직전 TaskList 정리, 마킹이 보고보다 먼저. ad-hoc 태스크에도 적용.
  단 미완 항목의 completed 위장 금지(false-green 방지) 명시

---

## [2.10.1] — 2026-07-07

### Fixed — 5-차원 적대적 재감사 (v2.10.0 배치 전체 fresh-context 재검증)

릴리스 직후 5개 병렬 리뷰어(evals 심층·훅/게이트 무결성·스킬/문서 정합·보안·live 사이트)로
재감사 — 발견 H3·M15·L16 전건 반영 (+오탐 2건 증거 기각).

**게이트 false-green 차단:**
- evals `--baseline` × `--agent/--scenario` 필터 조합 시 저장 거부 — 부분 기준선이
  커버리지를 침묵 은닉하던 경로 차단. 손상 baseline(pass_rate 누락)은 크래시 대신 회귀 플래그.
- verify-done §6 표-셀 검사의 매직 `33` 커플링 제거(에이전트 수가 바뀌면 검사가 조용히
  skip-green되던 self-disable) + 에이전트 수 검증 신설. §3 ruff를 evals/까지 확장.
- CI: pytest exit 5(수집 0)를 green→fail로 (테스트 소실은 실패), ruff 스텝 신설,
  `permissions: contents: read` 명시.
- discover가 `.ruff_cache` 등 로컬 캐시를 유령 시나리오로 취급해 게이트를 무너뜨리던 것 스킵.

**MUST MATCH 단일소스화:**
- auto-dev T-merge 마커 스니펫이 지문 로직을 복제하던 것(예외절·타임아웃 3곳 드리프트
  실재) → stop-validator 모듈을 로드해 `_worktree_state_hash()` 직접 호출 — 물리적 단일 소스.
- stop-validator eval 제외를 `/fixture/` 세그먼트로 축소 + run.py --validate가
  "시나리오 루트 .py 금지"·"fixture 모듈 스코프 위험 호출(os.system 등) 금지"를 구조로 강제.

**보안/공급망:**
- self-improve에 입력 신뢰 경계 명시(ledger 텍스트는 데이터, 내장 지시 실행 금지 —
  프롬프트 인젝션 방어) + 승인-전 eval 실행 예외의 정직 고지.
- GitHub Actions 전부 커밋 SHA 핀, Hugo 바이너리 sha256 검증, gitleaks 오탐 근원 제거
  (fixture 식별자가 private-패턴 룰의 `_quant` 부분열과 충돌 → `total_count`로 리네임).

**채점 견고성:** `_norm` NFC 정규화(한글 false-red), `CKKIT_EVAL_TIMEOUT` 비정수 폴백,
validate를 실행 경로에선 필터 범위로(무관 WIP가 dry-run까지 막던 것).

**문서/발견성:** 세션 주입 Skill Trigger Map·README Key Skills에 native-watch/self-improve
등재, gitignore된 Work ID 인용 → spec 경로로 정규화, spec의 self-improve 원설계에
"구현 시 조정" 주석, 사이트 en 죽은 링크 6건(live 404 실측)·en 페이지 한국어 UI 문자열·
x-default hreflang·meta 절단 수정, evals/README 주의사항(리포트 민감정보·.bak 1세대) 추가.

**Notes:** 테스트 232 green(+7), 오탐 기각 2건(baseline 미추적 주장 — ef858ee로 반증,
CLAUDE.md 2.3.0 스테일 주장 — 9806d1c에서 기수정).

---

## [2.10.0] — 2026-07-07

W-014 toolkit 개선 배치 (spec: `docs/specs/2026-07-07-toolkit-improvement-batch.md`).
각 Work마다 적대적 리뷰(A~E) 수행 — 발견 전건(HIGH 9 · MEDIUM 19 · LOW 18) 반영 후 머지.

### Added

- **Agent Evals 하네스** (`evals/` + `scripts/run-evals.sh` + verify-done §10) — 핵심
  에이전트(review-code·fix-bugs·implement-code) 행동 회귀를 기계 검증. deterministic
  채점 우선, LLM-judge 보조, API 부재 시 명시적 SKIPPED(exit 2).
- **`/native-watch` 스킬** + `docs/native-absorption.md` SSOT 대조표 — 네이티브 흡수
  감시 루틴화 (스케줄링은 네이티브 `/schedule` 위임).
- **`/self-improve` 스킬** — feedback ledger 반복 결함을 에이전트/스킬 정의 개선
  diff로 제안. evals 후퇴 없음 + 사용자 승인 없이는 적용 불가(HARD-GATE).
- **사이트 다국어(ko+en)** — about 아키텍처 페이지 승격, getting-started 신규, SEO
  front matter. 프로젝트 홍보 전용(개인 콘텐츠 배제, `docs/personal/` gitignore).

- **implement-code 계약 강화** — DELEGATION_SIGNAL을 모든 응답의 마지막 블록으로
  무조건 출력하도록 명시 (evals가 잡은 첫 실회귀: 헤드리스 실행 간헐 누락 flake).
- **stop-validator 검증 스코프** — `evals/scenarios/`(의도적 red fixture 데이터)를
  lint/pytest 스코프에서 제외 (+ auto-dev T-merge 마커 스니펫 MUST MATCH 동기화).

### Changed

- README/CLAUDE.md/marketplace-submission.md — `claude-plugins-community` 카탈로그
  **등재 완료** 반영(2026-07-07 확인), 두 설치 경로(공식 카탈로그 ~1일 전파 / 개인
  마켓플레이스 즉시) 문서화. 스킬 카운트 14 → 16.

---

## [2.9.3] — 2026-07-03

### Fixed — 3-차원 적대적 재감사 (P0 false-green + 정직성 + 훅 fail-open)

2.9.2 상태를 3개 fresh-context 리뷰어(checklist·게이트·훅보안)로 재감사해 나온 결함 수정.

**게이트 false-green:**
- **P0 — verify-done §5 시크릿 스캔 false-green**: `... | head -1 | grep -q`가 매치 다수(≈16KB+)일 때
  상류 grep을 SIGPIPE(141)로 죽여 `pipefail`이 파이프라인을 비정상 종료로 만들고, 시크릿이 있어도
  green으로 빠졌다. 결과를 변수로 수집(`$(... || true)`)해 `[ -n ]` 판정으로 교체. 2000줄 매치 DETECTED 실증.

**훅 보안(fail-open/우회):**
- **protect-sensitive content-scan fail-open (P1)**: 구조화(list/dict) message payload에 `re.search`가
  TypeError→blanket except→exit0(스캔 우회). `str()` 강제 직렬화로 차단.
- **protect-sensitive 검사 순서 (P2)**: syscall 없는 원본 경로 검사를 realpath(널바이트 등에 ValueError)
  **앞으로** 이동 — syscall 실패로 게이트가 건너뛰어지지 않게.
- **secret 경로 heuristic (P2)**: `mysecret.txt`/`api_secret.json`이 안 걸리던 lookbehind 제거,
  `secrets?(?=[._/\d-]|$)`로 교체(`secretary` 제외 유지).
- **stop-validator false-green (P1)**: bash `.py` write 대상 추출이 따옴표(`> "x.py"`)·변수·`python -c`·xargs를
  놓쳤다. 따옴표 strip + **세션이 .py를 bash로만 쓰고 신뢰가능한 Edit .py가 없으면 전체 dirty 검증으로
  폴백**(미검증 green보다 오검증 red) + NotebookEdit `notebook_path` 반영.
- **훅 hang 방지 (P2)**: Pre/PostToolUse에 `timeout` 추가, protect-sensitive·auto-format에 stdin `isatty` 가드.

**checklist 동시성/정직성:**
- **cmd_pass TOCTOU (P2)**: verify를 락 밖에서 도는 동안 항목 verify가 바뀌면 stale 명령으로 flip하던 것 →
  락 안에서 verify 문자열 재확인 후 다르면 flip 거부.
- **cmd_verify lost-update (P2)**: 전체 스냅샷을 덮어써 동시 pass/신규 항목을 잃던 것 → 락 안에서 재읽기 후 id별 병합.
- **F1 정직성 (P1)**: docstring이 gate-time staleness를 "해소"로 과장 → 자동 게이트(§8)는 여전히 status(원장)를
  읽고 `verify`는 opt-in임을 명시(해소 아님, 재증명 도구 제공).
- **killpg docstring/테스트**: "grandchild 안 남김" → setsid/데몬화는 못 잡는 best-effort로 정정, F6 테스트를
  실제 grandchild 정리 검증으로 강화.

**게이트 견고성:**
- verify-done §9 test-ratchet: fresh/단일커밋 저장소에서 base를 HEAD로 폴백(워킹트리 삭제 포착),
  test 디렉토리 레이아웃(`tests/`·`spec/`) 인식. §7 stale-ref가 중첩 경로(`scripts/sub/x.sh`)도 검사.

### Notes
- 테스트 6건 추가(총 179 pytest green), verify-done exit 0(13/0), P0/P1 E2E 스모크 검증.
- 수용된 경계(문서화): Bash를 통한 시크릿 **읽기/유출**은 path-based 훅이 막지 않음(gitleaks는 커밋만).
  feedback_ledger digest의 persistent-injection 여지는 후속 하드닝 후보(P2).

---

## [2.9.2] — 2026-07-03

### Fixed — 2.9.1 감사가 남긴 잔여 2건 마저 정리 (F6 버그 + F1 트레이드오프)

2.9.1에서 "정직한 한계"로 남겼던 checklist 잔여 2건을 애매함 없이 닫음.

- **F6 (verify subprocess grandchild leak, 버그)**: `cmd_pass`가 verify를 `shell=True`로
  실행하면서 (1) 타임아웃 시 shell만 죽고 손자 프로세스가 누수되고, (2) 락을 verify 실행
  600s 내내 점유했다. → `_run_verify` 헬퍼로 분리: `start_new_session=True`로 새 프로세스
  그룹에 띄우고 타임아웃 시 `killpg`로 그룹 전체 종료(손자 정리, exit 124). verify는 **락 밖**에서
  실행하고 flip(재읽기→수정→쓰기)만 락 안에서 수행.
- **F1 (gate-time staleness, 트레이드오프)**: `passes`는 flip 시점 기록이라 `status`는 재검증을
  안 한다. 자동 재검증은 재귀·side-effect(재배포 등) 부채라 기본화하지 않되, **opt-in
  `checklist verify <work_dir>` 명령**을 추가 — 전 항목 verify를 재실행해 회귀한 stale-true를
  false로 되돌린다(gate-time 재증명). `status`=빠른 원장, `verify`=재증명.

### Notes
- 테스트 4건 추가(verify 통과/stale-demote/부재 + F6 타임아웃 killpg), 173 pytest green,
  verify-done exit 0. blog 포스트 "초록불은 거짓말을 한다" 말미를 정리 완료 상태로 갱신.

---

## [2.9.1] — 2026-07-03

### Fixed — 6-차원 적대적 감사 반영 (보안·게이트 false-green·거버넌스)

프로젝트 전체를 6개 fresh-context 적대적 리뷰어로 감사해 나온 결함을 수정. 특히
**게이트가 실패를 green으로 보고하던 false-green** 계열과 시크릿 차단 우회를 우선 처리.

**보안:**
- **protect-sensitive 매처 우회 (P1)**: `hooks.json` PreToolUse 매처가 `Edit|Write|...`라
  `MultiEdit`/`NotebookEdit`를 안 잡아 `MultiEdit(".env")`로 시크릿 파일 차단이 우회됐다.
  매처에 `MultiEdit|NotebookEdit` 추가 + `notebook_path` 경로도 검사(auto-format 매처도 동일 보정).
- **문서 정정**: protect-sensitive는 "커밋/내용의 시크릿 차단"이 아니라 **경로 기반**
  (`.env`/키) 차단이며 Bash·commit은 안 잡는다(그건 gitleaks+pre-commit)고 CLAUDE.md/README 정정.

**게이트 false-green:**
- **checklist `status` 손상/빈 파일 (P1)**: `echo '[]' > checklist.json` 또는 손상 파일이
  exit 3(skip)이 되어 완료 게이트를 조용히 통과했다. 존재하는 파일이 빈/비-리스트/파싱실패면
  FAIL(1), 진짜 부재만 3(skip)으로 구분.
- **verify-done §8 helper 부재 (P1)**: `checklist.py`가 없으면 미완 checklist가 있어도 green이던
  fail-open을 fail-closed로.
- **test-ratchet §9 (P1)**: `merge-base main HEAD`가 `main`에서 HEAD와 같아져(=빈 diff) 커밋된
  테스트 삭제를 못 보던 blind-spot + main/merge-base 부재 시 조용한 green을 수정 —
  origin/main→HEAD~1 폴백 + 실패 시 [warn]. `--`/`++` 내용줄을 파일헤더로 오인하던 파서도 `@@` 상태추적으로 수정.
- **stop-validator `_bash_may_write_py` (P1)**: 동시에 너무 좁고(`python gen.py`·cp/shutil 놓침)
  너무 넓던(`cmd > log`·`grep open( x.py` 오탐으로 세션 스코핑 무력화) blanket 휴리스틱을 폐기 →
  ① 명시적 .py write 대상만 정밀 추출 + ② git-untracked .py union(opaque codegen 포착)으로 교체.

**거버넌스·always-injected 룰 죽은 참조:**
- `agent-system.md`: 없는 에이전트 참조(schedule-task/trigger-pipeline/notify-team/track-sla)
  `background:true` 섹션 제거, "check plugin.json agent list"→auto-discovery, 위임 시그널을
  canonical 4-type(agent-delegation-chain.md SSOT)로 정렬, diagnose/monitor 예시 제거.
- `mcp-usage.md`: 존재하지 않는 `scripts/db-tunnel.sh` 참조 제거.
- 에이전트: `design-services` `disallowedTools`에 `Task` 추가, `notify-team` 유령 위임
  (analyze-tech-debt/manage-api-versions) → `TASK_COMPLETE`, 누락된 `maxTurns` 21개 에이전트에 추가.

**setup/CI:**
- `setup.sh`: `_check_version`의 `return 1`이 `set -e`로 설치를 중단(fresh-env brick)하던 것 +
  버전 파싱 파이프라인 abort → `|| true`로 자문(advisory)화.
- `validate.yml`: pytest 스텝이 `|| echo`로 **테스트 실패도 green**이던 no-op 수정
  (exit 5=no-tests만 skip, 그 외 실패는 CI 실패). 금지필드에 `hooks` 추가(문서 주장과 일치).

**재발 방지 (신규 게이트):**
- `verify-done.sh §7`: hooks.json뿐 아니라 **rules/agents의 `scripts/*.sh` 참조 실재도 검증** —
  always-injected 룰의 죽은 스크립트 참조가 매 세션 주입되던 문제를 기계로 차단.

### Notes
- 신규 rule 0 → count 변동 없음. 테스트 4건 추가(checklist 손상 2 + bash-target 2), 169 pytest green,
  verify-done exit 0. 모든 P1 E2E 스모크 검증(MultiEdit 차단·corrupt checklist FAIL).
- 정직한 잔여 한계: checklist `passes`는 flip 시점 기록이라 gate-time 재검증은 안 함(F1) —
  '연속 모니터'가 아닌 '완료 원장'으로 문서화. verify subprocess의 grandchild leak(F6)은 P2로 잔류.

---

## [2.9.0] — 2026-07-03

### Added — Durable Executor Checklist & 기계 완료 게이트 (W-013)

장기·다세션 루프 실행에서 "무엇이 검증되어 완료인가"를 모델 주장이 아닌 **기계로**
판정한다. 네이티브 Task는 `~/.claude/tasks/<session-UUID>/` 세션 스코프라 세션 경계를
못 넘는다 — kit은 루프 엔진을 재발명하지 않고(네이티브 위임), 네이티브가 없는 것 —
durable 상태 파일 + 결정론 완료 게이트 + 검증 계약 — 만 얇게 추가한다.

- **`checklist.py` + `scripts/checklist.sh` 신설**: 완료 상태의 단일 authority
  (`docs/works/<W>/checklist.json`, 스키마 `{id, description, acceptance, verify, passes}`).
  `pass <id>`는 모델 주장으로 flip하지 않고 항목의 `verify` 명령을 **실제 실행해 exit 0**일
  때만 `passes:true`로 전환한다(self-mark 차단). W-011 flock/os.replace 원자 쓰기 재사용.
- **`verify-done.sh`에 게이트 2건 추가**: (8) active Work checklist에 `passes:false`
  잔존 시 FAIL·부재 시 스킵, (9) test-ratchet — diff에서 test/assert가 `TEST-RATCHET-ALLOW`
  마커 없이 순감소하면 FAIL(산문 규율이 아닌 기계 체크).
- **인라인 규율(신규 rule 파일 없음 — ssot 준수)**: `loop-engineering.md`에 재앵커
  (요약 아닌 planning-results 원본 재독) + idle 감지(커밋 0 = 종료); `auto-dev/SKILL.md`에
  durable executor 규율(미완 1항목/iter, verify 통과 전 passes 금지, 상태 쓰기 메인 세션 소유);
  `review-code.md`에 검증 독립성(작성자≠검증자 fresh context 충족, cross-family judge 미충족 갭 정직 표기).

### Fixed — Bash 편집 .py의 Stop 검증 커버리지 갭 (W-012 #3)

- **`stop-validator._session_edited_files`**: 기존엔 Edit/Write 계열 tool_use만 스코프에
  잡아, 루프 에이전트가 Bash(heredoc/sed/tee/redirect)로 쓴 `.py`는 검증을 우회했다.
  transcript에서 Bash `.py` 쓰기가 감지되면 스코프를 '불완전'으로 보고 **전체 dirty .py
  폴백**(오검증은 안전, 미검증은 위험) → 미검증 코드 유입 차단. 읽기 전용 Bash(.py 대상
  pytest/ruff/grep)는 폴백 트리거 안 함.

### Notes

- 신규 rule 0개 → rules count/CHECKSUMS 변동 없음. checklist.py는 CLI 헬퍼(feedback_ledger
  선례)라 hooks.json 미등록. 테스트 25건 추가(checklist 13 + stop-validator Bash 커버리지 12 계열).
- 설계·적대적 리뷰 과정: `docs/specs/2026-07-03-durable-executor-discipline.md`(v2, 3중 리뷰),
  리서치: `docs/research/2026-07-long-running-loop-agents.md`.

---

## [2.8.0] — 2026-07-02

### Added — 병렬 worktree 병합 프로토콜 (W-011)

kit은 "worktree 격리 진입" 정책은 있었지만 "병합 복귀" 규범이 없었다 — 격리 없이는
충돌이 즉시 나고, 격리만 있으면 충돌이 병합 시점으로 이연될 뿐이다. 이번 릴리스가
복귀 프로토콜을 명문화한다.

- **`rules/parallel-worktree.md` 신설** (rules 1.3.0): 검증 그린 후에만 ExitWorktree,
  순차 병합 원칙, dispatch 전 파일 소유권 확인, 충돌 시 `git-workflow`로
  NEED_USER_INPUT 에스컬레이션, worktree 안 `docs/works/**` 갱신 금지.
- **에이전트 8개 정비**: `optimize-logic`에 `isolation: worktree` + `maxTurns` +
  `disallowedTools: [Task]` 추가(커버리지 누락). `implement-api`·`generate-boilerplate`·
  `sync-docs`에 `ExitWorktree` 툴 추가(격리 진입만 있고 복귀 수단이 없었음). 파일 수정
  에이전트 8개 전부에 "Worktree 복귀 프로토콜" 섹션 추가.
- **auto-dev Step 2에 worktree 병합 절차 명시**: 하나 병합 → 검증 → 다음(동시 병합
  금지), 동일 지점 충돌 2회 = 청크 재설계 신호.
- **유령 참조 정리**: 존재하지 않는 `write-ui-tests`를 CLAUDE.md/README/
  `rules/agent-system.md`의 isolation 목록에서 제거하고 실제 8개 에이전트로 교체.
- **리서치 노트 게시**: `docs/research/2026-07-harness-loop-engineering.md` —
  하네스/루프 엔지니어링 2026 중반 지형도(개념 계보·3대 루프 구현체·검증 원칙·
  병렬 도구 생태계·kit 대조).

### Fixed — 병렬 세션/프로세스 레이스 컨디션 3건 (W-011)

- **stop-validator 크로스세션 오염**: retry 카운터가 repo 해시로만 키가 만들어져
  같은 프로젝트의 병렬 세션들이 서로의 카운터를 덮어쓰거나 리셋할 수 있었다 —
  stdin `session_id`로 세션 스코프 격리(부재 시 기존 동작). 스코프 적용은 모든
  reset 경로(`stop_hook_active` 가드 포함)보다 선행한다. auto-dev 검증 마커는
  이름 대신 **내용(작업트리 상태 해시 = HEAD + diff + porcelain)** 으로 유효성을
  판정 — 병렬 세션의 마커, 검증 후 변경된 상태, untracked 추가에서는 스킵하지
  않으며 빈 내용 마커(구버전 touch)는 무효다. 회귀 테스트 9개 추가.

### Security — /tmp 예측 경로 하드닝 (W-011)

- 마커/카운터/락/ledger 쓰기 전부 **심링크 비추적**으로 전환(CWE-59/377): `O_NOFOLLOW`
  tmp 파일에 쓴 뒤 `os.replace`(rename은 목적지 심링크 자체를 교체) — 공유 호스트에서
  예측 가능한 `/tmp` 경로를 심링크로 선점해 임의 파일을 덮어쓰는 공격 차단.
  심링크 마커는 내용을 읽지 않고 즉시 무효 처리.
- 시간(TTL) 기반 마커 스킵 제거 — 파일 생성만으로 Stop 검증을 30분 우회할 수 있던
  경로 폐쇄. ledger `severity`는 화이트리스트(critical/high/medium/low) 강제 —
  `|`/개행 주입으로 테이블 행을 깨고 세션 컨텍스트에 위조 행을 주입하는 벡터 차단.
- ledger 락은 `LOCK_NB` + 5초 데드라인(초과 시 무락 진행) — 락 보유 프로세스 정지로
  파이프라인이 무한 대기하지 않는다. `work.sh`는 claim 후 실패 시 trap으로
  `.claimed` 고아 항목을 롤백해 Work 번호 영구 소각을 방지.

### Fixed — 2차 적대적 리뷰(멀티에이전트) 지적 반영 (W-011)

첫 리뷰 라운드가 놓친 결함을 멀티에이전트 워크플로우 리뷰(27 검증 finding)가
잡아냈다. 특히 검증 마커 지문의 untracked 우회는 1차에서 "닫았다"고 본 것이 실제론
남아 있던 케이스다.

- **검증 마커 지문 재설계(F1/F2/F3)**: 지문을 `HEAD + git status --porcelain`에서
  **검증 스코프(get_modified_py_files) 각 .py의 내용 sha256**으로 교체. porcelain은
  untracked 파일의 '경로'만 반영해, 이미 untracked인 .py의 내용을 마커 생성 후
  수정하면 지문이 그대로여서 미검증 코드가 스킵될 수 있었다(실제 검증 우회). 내용
  해시로 그 우회를 닫고, 동시에 .py 아닌 파일(review-results.md) 변경엔 지문이
  불변이라 마커가 불필요하게 무효화되지도 않는다. `git rev-parse HEAD` 실패 시 ''
  반환(보수적 무효)로 훅/스니펫 정합.
- **상태 파일을 사용자 전용 디렉토리로(F4/F10)**: 마커·retry 카운터·ledger 락을
  world-writable `/tmp` 예측 경로에서 `$TMPDIR/claude-{uid}`(0700)로 이전 — 타
  사용자가 심링크 없이 평범한 파일 선점만으로 카운터를 오염(cap 상시 발동)하거나
  유효 마커를 심는 공격을 차단. ledger 락이 저장소 트리를 벗어나 커밋 오염·
  porcelain 교란도 해소. stop-validator 엔트리포인트에 fail-safe try/except 추가
  (타 소유 파일 접근 예외로 훅이 죽지 않고 통과).
- **마커 소비 원자화(F8)**: `exists→read→unlink`를 `os.rename` claim으로 교체 —
  같은 체크아웃의 두 병렬 Stop 훅 중 한쪽만 마커를 가져가고 나머지는 정상 검증.
- **병합 정책 모순 해소(F5)**: "메인이 순차 병합"(강제 불가) 규범을 제거하고 "순차
  **dispatch**"(메인이 실제 통제 가능)로 재정의. 병렬 안전은 dispatch 시점의 파일
  disjoint 분리로 확보 — 각 에이전트는 green이면 스스로 ExitWorktree.
- **feedback ledger 심링크 보존(F7)**: `os.replace`가 심링크를 파괴하던 것을
  realpath 대상 교체로 바꿔 사용자의 공유 원장 심링크를 보존. 락 타임아웃 시
  stderr 경고(F9)로 lost-update 재발을 관측 가능하게.
- **work.sh 중복 가드 비브릭(F6)**: 동일 Work ID 다중 매치 시 exit 1로 모든
  하위명령을 막던 것을 경고 + 결정론적 첫 항목 선택으로 완화(중복 정리용 명령까지
  막던 문제 해소). cross-clone은 로컬로 직렬화 불가함을 스크립트에 명시.
- **feedback ledger lost-update**: auto-dev가 T-review/T-security를 병렬 실행하며
  둘 다 `feedback.sh upsert`를 호출하는데 read-modify-write에 락이 없어 한쪽 기록
  소실·`F-id` 중복 채번이 가능했다 — `fcntl.flock` 배타 락 + tmp 파일 `os.replace`
  원자 교체로 수정. 동시 8프로세스 upsert 무손실 회귀 테스트 추가.
- **work.sh Work ID TOCTOU**: 동시 `work.sh new` 실행 시 동일 `W-XXX`가 중복 발급될
  수 있었다(번호 채번과 디렉토리 생성이 비원자적) — `.claimed/` 레지스트리에 원자적
  `mkdir`로 ID를 선점(재시도 + 지터). `find_work_dir`는 중복 매치 시 `head -1`로
  은폐하지 않고 명시적 에러. 동시 10회 생성 검증(중복 0).

---

## [2.7.2] — 2026-06-22

### Fixed — stop-validator 테스트 타임아웃 오탐 (대형 레포) + 전체 스위트 실행 제거

전체 테스트 스위트가 60초를 넘는 레포에서 `.py`를 편집할 때마다, 코드가 전부
통과하는데도 `test_failure: 테스트 실행 시간 초과 (60초)`로 Stop이 거짓 차단되던
문제를 수정. 근본 원인은 매 턴 종료마다 도는 Stop 훅이 **전체 pytest 스위트**를
실행한 것 — 지연이 스위트 크기에 비례해 대형 레포에서 항상 타임아웃났다.

- **전체 스위트 실행 제거(근본 차단)**: `check_tests()`는 이제 이번 세션이 편집한
  `test_*.py`/`*_test.py`만 실행한다(lint의 스코프 철학과 동일). 소스만 편집했으면
  테스트 검증을 스킵한다. 전체 회귀 검증은 CI(`validate.yml`)·`/test`·
  `verify-done.sh`의 몫. 이로써 대형 레포 타임아웃 오탐이 **구조적으로 불가능**해진다.
- **타임아웃 ≠ 실패**: 남는 단일 느린 테스트를 위해 `TimeoutExpired`는 차단이 아니라
  비차단 `[WARN]`으로 강등(통과 반환). 실제 실패 테스트는 여전히 차단된다.
- **타임아웃 설정 가능**: `CLAUDE_STOP_TEST_TIMEOUT` 환경변수로 한도 조절(기본 60초).
- **죽은 코드 제거**: 전체 스위트 탐색용 `find_test_files()`·`EXCLUDE_DIRS` 삭제.
- **부수**: `scripts/verify-done.sh`가 pytest 인터프리터 탐색 시 프로젝트
  `.venv`/`venv`를 우선하도록 정렬(훅의 `_pytest_python()`과 일관).

---

## [2.7.1] — 2026-06-15

### Fixed — stop-validator 무한 루프 + pytest 오탐

턴 종료 시 도는 `stop-validator.py`가 외부 dirty `.py`(병렬 세션 미커밋 등)를 만나면
무한 차단 루프에 빠지던 문제를 수정. 하니스의 연속 차단 cap이 강제 종료할 때까지 반복됐다.

- **무한 루프 근본 차단**: `max_retries_exceeded` 분기가 `block()` + 카운터 reset 하던 것을
  `allow()`로 전환. cap은 "검증 중단·턴 종료"가 정상인데 정반대로 동작해
  `test_failure ↔ max_retries` 사이클을 영원히 돌렸다.
- **pytest 오탐(#332)**: `check_tests()`가 시스템 `python3`로 pytest를 실행해
  모듈 부재 시 `No module named pytest` → `test_failure`로 차단했다. 이제 프로젝트
  `.venv`/`venv` 인터프리터를 우선 사용하고, 모듈 부재는 차단이 아니라 스킵으로 처리.
- **`stop_hook_active` 존중**: stdin을 읽어 stop-hook 재진입(`stop_hook_active=true`) 시
  즉시 통과 — 네이티브 무한 루프 가드.
- **세션별 파일 스코핑(1차 트리거 제거)**: 기존엔 `git diff HEAD`로 레포 전체 dirty
  `.py`를 검증 대상으로 삼아, *이 세션이 안 건드린* 병렬 세션 미커밋 `.py`에도 매 턴
  pytest를 돌렸다(사건 1차 트리거). 이제 Stop 훅 `transcript_path`를 파싱해 이 세션이
  Edit/Write로 실제 편집한 파일만 검증한다. transcript 부재 시 전체 검증으로 폴백.
- **TTY hang 가드**: `_read_input()`이 수동 실행 시 `stdin.read()` EOF 대기로 멈추지
  않도록 `isatty()` 체크 추가.

## [2.7.0] — 2026-06-14

### Removed — Core-only consolidation

테스트 0개, v2.0.0 이후 실질 변경이 없던 **5개 도메인 플러그인을 제거**하고 단일 core로 집중. 잘 테스트된 core를 들고 가는 게 미검증 플러그인 5개를 배포·버전관리하는 것보다 zero-debt다.

- 제거: `claude-code-kit-frontend`, `-infra`, `-ops`, `-data`, `-integration` (총 33 agents, 10 skills, **0 tests**)
- `marketplace.json`을 core 1개만 노출하도록 정리
- `setup.sh` 도메인 선택/설치 로직 제거 (`--all`/`--list` 플래그 삭제)
- README·CLAUDE.md를 단일 플러그인 구조(2-tier)로 갱신
- **복구 지점**: 제거 직전 상태를 `v2.6.0-with-domains` 태그로 보존 (git 히스토리로 언제든 복원 가능)

### Changed

- core `claude-code-kit` 버전 2.6.0 → 2.7.0
- **배포 모드: 상대경로 → `git-subdir`** — `marketplace.json`의 플러그인 source를 `./plugins/common`(로컬 경로)에서 `git-subdir`(모노레포 서브디렉토리 sparse-clone)로 전환. 이제 진짜 리모트/버전 관리 플러그인으로 동작하며 `/plugin`의 "Update now"가 작동한다. (단일 플러그인이 되어 가능해짐)

---

## [2.6.0] — 2026-06-13

네이티브 프리미티브 최대 활용 + 자체 재구현 제거 (Spec 1~5, W-005~009).
설계 스펙: `docs/specs/2026-06-13-*.md`. 전부 하위호환 (fail-open / graceful degradation).

### Added

- **Feedback memory loop** (Spec 3) — `hooks/feedback_ledger.py`로 validation·review 결함을 누적(상한·중복제거·감쇠 SSOT)하고, session-start가 상위 빈도 교훈을 `=== LESSONS ===`로 주입. 캡처 진입점은 `scripts/feedback.sh`(work.sh와 동일한 ./scripts 관례, `CLAUDE_PLUGIN_ROOT` 의존 없음). `rules/feedback-loop.md`.
- **Loop engineering** (Spec 5) — `rules/loop-engineering.md`로 게이트(설계·사람 멈춤) vs 루프(실행·자율 완주)를 분리. auto-dev 배치 드라이버 + 종료 가드.
- **Plugin dependencies** (Spec 1) — 도메인 5종 매니페스트에 `dependencies: ["claude-code-kit"]` 선언 (네이티브가 common 강제 활성화).
- **Architecture & Concepts** README 섹션 (Spec 4) — 네 갈래 융합(네이티브·superpowers·Hermes·Work) + Harness×Loop engineering narrative.
- **Definition of Done 완료 게이트** (Spec 6) — `scripts/verify-done.sh`(JSON·CI필드·ruff·pytest·시크릿·카운트 sync·stale 참조 통합 게이트, FAIL 시 비정상 종료) + `rules/definition-of-done.md`(Iron Law of Completion + 금지 어휘). "완료"를 판단이 아니라 명령의 출력으로 강제. loop-engineering 종료 조건과 연계.

### Changed

- **Hooks exec form** (Spec 1) — `hooks.json`를 `command`+`args[]` exec form으로 전환, `${CLAUDE_PLUGIN_ROOT}` 경로 인용 문제 제거.
- **Stop hook** (Spec 1) — `stop-validator.py`가 실패 시 네이티브 `{"decision":"block","reason":...}`를 emit해 Claude가 수정 턴을 이어가도록 개선.
- **Orchestration model** (Spec 2) — "main만 조율"에서 "스케일별 네이티브 프리미티브"로 재서술. Small/Medium은 스킬 주도 플랫, Large는 네이티브 `ultracode`. `agent-teams` 스킬을 네이티브 workflow 가이드로 재정의.
- delegation-signal 표준 포맷을 `rules/agent-delegation-chain.md`에 SSOT로 명문화.
- **superpowers interop** — `using-claude-code-kit`을 additive-only로 슬림화. 범용 스킬 규율(1% 룰·red flags)은 `superpowers:using-superpowers`와 공유하고 kit 전용 델타(에이전트맵·Work·체인·native/loop/DoD)만 유지. 둘 다 활성 시 중복 0, kit standalone도 자급. interop 가이드 섹션 추가.

### Removed

- **`agent-lifecycle.py`** (Spec 1) — 순수 로깅 훅 삭제. 서브에이전트 관측은 네이티브 OpenTelemetry(`agent_id`/`parent_agent_id` 스팬)로 위임. `SubagentStart`/`SubagentStop`/`PreCompact` 등록 제거.

### Notes

- 네이티브 dynamic workflow(`ultracode`)·`/goal`은 대화형 전용이라 스킬에서 프로그래밍 트리거 불가(2026.6 검증) → 자동 위임은 검증된 Task 시스템 + 스킬 루프로 구현(자체 데몬 없음).
- 버전: common 2.3.0→2.6.0, 도메인 플러그인 5종 2.0.0→2.1.0.

---

## [2.2.0] — 2026-05-03

### ⚠️ Behavior Change — Stop Hook

The `Stop` hook has been replaced with an automated validator (`stop-validator.py`).

**What changed:** Previously, the Stop hook asked Claude to self-evaluate completion. Now it runs `ruff` and `pytest` automatically and **blocks the session from stopping if either fails.**

**Who is affected:** All users with Python files modified in the current session.

**How to disable** (per-session or globally):

```json
// plugins/common/hooks/hooks.json → restore the prompt-based hook:
"Stop": [
  {
    "hooks": [
      {
        "type": "prompt",
        "prompt": "개발 작업이 완료된 경우 ...",
        "timeout": 30
      }
    ]
  }
]
```

Or remove the `Stop` section entirely to disable all stop validation.

**How it works:**
- No Python files modified → instant pass (no ruff/pytest run)
- `ruff` not installed → warning to stderr, pass
- `pytest` not installed → warning to stderr, pass
- auto-dev pipeline already validated → marker file detected, skip (no double-validation)
- Max 2 auto-fix retries before giving up

### Added

- **`stop-validator.py`** — automated Stop hook: detects Python changes, runs ruff (with auto-fix) and pytest, blocks on failure with structured JSON output
- **7 unit tests** for `stop-validator.py` (`hooks/tests/test_stop_validator.py`):
  - `test_no_py_changes_exits_zero`
  - `test_lint_auto_fixed_prints_json_and_exits_zero`
  - `test_lint_auto_fixed_json_structure`
  - `test_test_failure_exits_two_with_correct_json`
  - `test_marker_skip_exits_zero_and_consumes_marker`
  - `test_lint_error_when_auto_fix_fails_exits_two`
  - `test_max_retries_exceeded_exits_two`
- **auto-dev SKILL.md** — T-merge step now creates a validation marker to prevent double-validation when auto-dev pipeline already ran lint/test

### Fixed

- Stop hook `PROJECT_ROOT` now derived from `git rev-parse --show-toplevel` (stable regardless of harness cwd)
- git-relative paths resolved against `PROJECT_ROOT` before passing to ruff (fixes silent lint skip when hook cwd ≠ project root)
- TOCTOU race condition in marker file check replaced with atomic `try/except unlink()`

---

## [2.1.0] — 2026-04-24

> 이 항목은 릴리스 당시 누락됐다가 **2026-08-17에 git 이력에서 사실만 복원**한 것이다
> (PR #1 `feat/discipline-layer`, 커밋 `5e7f6f7`·`9c65c73`·`2b5bd12`). 당시 의도를
> 기억으로 채우지 않고, 실제 diff에 있는 변경만 적는다.

### Changed — discipline layer

- `auto-dev`: fallback 모드 조건을 "Work ID 없음"에서 **"`docs/works/` 폴더 자체가 없는
  경우"**로 정정. Work ID 없이 새 요청으로 진입하는 경우(`/auto-dev <요청>`)와 구분된다.
- `brainstorming`: Task 네이밍 규약 `[Brainstorm] {항목명}` 명시(plan-task의 `[Planning]`
  Task와 구분) + brainstorming 단계는 Work ID가 없으므로 metadata를
  `{"phase": "brainstorming"}`만 사용하도록 고정.
- `test_session_start_workflow.py`: 앰비언트 환경 의존을 monkeypatch로 격리.

## [2.0.0] — 2026-04-22

### Breaking Changes

- **Removed from all agent frontmatter** (non-standard fields, unsupported by the official plugin spec):
  - `permissionMode` — removed from 6 agents
  - `context_cache` — removed from all agents
  - `output_schema` — removed from all agents
  - `next_agents` — removed from all agents
  - Inline `hooks:` blocks — removed from all agents (covered by plugin-level `hooks/hooks.json`)
- **Removed from all skill frontmatter**:
  - `domain`, `argument-hint`, `allowed-tools` — non-standard, not supported by official spec

If you extended agents by adding these fields in project-local overrides, remove them to stay compliant.

### Added

- **Manifest compliance** — all 6 `plugin.json` files now include `homepage`, `repository`, `license`, `author.email` for official registry submission
- **`maxTurns` field** — added to 11 agents to prevent infinite loops:
  - Implementation agents (`implement-code`, `fix-bugs`, `write-tests`, `plan-implementation`, `write-api-tests`): `maxTurns: 20`
  - Exploration/review agents (`review-code`, `verify-code`, `verify-integration`, `explore-codebase`, `analyze-dependencies`, `security-scan`): `maxTurns: 10`
- **New lifecycle hooks** in `hooks/hooks.json`:
  - `SubagentStart` — logs agent invocation start
  - `SubagentStop` — logs agent invocation completion
  - `PreCompact` — saves state summary before context compaction
- **`agent-lifecycle.py`** — new hook script handling the three lifecycle events above
- **91 unit tests** for all hook scripts:
  - `tests/test_session_start.py` — 19 tests (frontmatter parsing, task map parsing, rules loading, main output format)
  - `tests/test_protect_sensitive.py` — 33 tests (file path blocking, content scanning, integration)
  - `tests/test_auto_format.py` — 19 tests (path validation, ESLint config detection, pipeline execution)
  - `tests/test_utils.py` — 21 tests (safe_path, debug_log, is_debug_mode, get_project_root)
- **CI strengthened** (`.github/workflows/validate.yml`):
  - `Check plugin.json required fields` step
  - `Check agent frontmatter — no forbidden fields` step
  - `Run hook unit tests` step (`pytest plugins/common/hooks/tests/ -v`)
- **English skill descriptions** — all 14 skill `description` fields converted from Korean to English for correct Claude auto-invocation behavior

### Fixed

- `agent-creator` skill template: removed `permissionMode` from the generated agent template (it was showing a now-unsupported field)
- All `hooks/hooks.json` paths already used `${CLAUDE_PLUGIN_ROOT}` — verified correct

---

## [1.1.5] — 2026-04-21

### Fixed

- W-007 validation issues: T-merge guard, confidence wording, Bash scope

---

## [1.1.4] — 2026-04-14

### Fixed

- GitHub Actions gitleaks failure
- Documentation updates

---

## [1.1.3] and earlier

Initial releases establishing the 33-agent + 12-skill core structure across 6 plugin domains.
