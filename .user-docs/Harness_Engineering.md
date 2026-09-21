# Harness Kit Engineering Guide

> 기준일: 2026-08-28
> 이 문서는 `harness-kit` 플러그인의 **실제 프로젝트 사용자 런북**과 **관리 저장소 운영 계약**을 함께 설명하는 현행 정본이다.

설치 명령과 Codex·Claude CLI/App별 증적 절차는 [Plugin Installation Guide](./Plugin_Installation_Guide.md)를 따른다. 이 문서는 설치 이후 어떤 순서로 설계·구현·검증하고, 관리자가 그 흐름을 어떻게 유지하는지에 집중한다.

---

# 제1부. 사용자용 — 프로젝트 수행 런북

## 1. 목적과 기본 원칙

AI Agent Harness는 Codex, Claude Code처럼 서로 다른 에이전트가 같은 프로젝트에서 같은 문서·구현·품질 기준으로 일하도록 만드는 작업 체계다.

핵심 원칙은 다음과 같다.

1. **플러그인으로 시작한다.** 실제 프로젝트는 이 관리 저장소를 clone하거나 스킬을 복사하지 않는다.
2. **작업 환경과 Git 계정을 먼저 고정한다.** 모든 참여자는 `harness-setup`과 `git-scoped-account`를 단일·복수 repo 구분 없이 자기 PC에서 최초 1회 실행한다.
3. **문서 권한은 필요한 프로젝트만 별도로 설정한다.** 원격 Git provider·저장소·참여자 계정을 준비한 뒤 관리자가 `project-write-access`로 공유 정책을 설정하고, 각 참여자는 자기 PC만 로컬 등록한다. 권한을 쓰지 않아도 하네스 흐름은 유지된다.
4. **설계가 먼저다.** 구현 전에 요구사항, 범위, 아키텍처, 완료 기준을 문서로 고정한다.
5. **에이전트가 읽을 고정 맥락을 만든다.** 단일 앱은 루트 `AGENTS.md`를 공용 정본으로 쓰고, 복수 앱은 `.ai-docs/root-context/AGENTS.md`를 Git 관리 원본으로 두며 루트 `AGENTS.md`는 실행용으로 갱신한다. 세부 규칙은 `.ai-docs/**/instruction/`으로 분리한다.
6. **구현은 작은 단위로 쪼갠다.** Phase, 태스크, 화면, 기능 단위로 구현하고 각 단위가 끝날 때 검증한다.
7. **문서와 코드를 함께 관리한다.** 코드가 달라지면 설계·컨텍스트·구현 계획의 괴리를 확인한다.
8. **품질 확인을 앞당긴다.** 구현 직후 검증·리뷰하고, 커밋은 그 다음에 한다.
9. **문서 개선은 명시 요청형이다.** 사용자가 요청한 경우에만 Markdown producer가 구조 검증 뒤 개선안을 제안하고, 승인된 변경만 반영한 뒤 다시 검증한다.
10. **프로젝트에는 Harness Kit 사용자 스킬을 복사하지 않는다.** 이는 배포 위치 규칙이며 다른 설치 스킬·플러그인·일반 Agent의 사용을 금지하지 않는다.

## 2. 설치 이후의 책임 경계

| 영역 | 담당 | 프로젝트에 남는가 |
|------|------|-------------------|
| 사용자 스킬 정본 20종 | 관리 저장소 `skills/` | 다음 plugin build의 입력 |
| 현재 stable `0.6.0` runtime 20종 | 설치된 `harness-kit` 플러그인 | local copy를 남기지 않음 |
| `project-write-access` | `0.6.0` runtime에 포함된 명시 호출 전용 스킬 | 관리자는 공유 정책 설정·변경, 각 참여자는 PC별 로컬 등록 |
| 프로젝트 문서 골격 | 프로젝트 수행자가 `harness-setup`으로 생성 | `.ai-docs/**`, `AGENTS.md` |
| 설계·구현 계획·프로토타입 | 프로젝트 수행자와 사용자 스킬 | `.ai-docs/**` |
| 코드·테스트 산출물 | 프로젝트 수행자 | 각 앱 repo |
| 리뷰·검증 보고 | 프로젝트 수행자와 사용자 스킬 | 기본은 대화 보고, 스킬이 별도 파일 생성을 금지하면 repo에 저장하지 않음 |
| 플러그인 build·upstream 최신화 | 하네스 관리자 | 이 관리 저장소 |

관리 저장소의 사용자 스킬 정본, `0.6.0`의 Codex·Claude runtime과 capability inventory는 모두 20종으로 같다. 게시된 최신 stable은 [`v0.6.0`](https://github.com/hb9397/harness-kit/releases/tag/v0.6.0)이다.

`harness-setup`의 쓰기 allowlist는 `.ai-docs/**`, 루트 `AGENTS.md`다. `.agents/skills/**`, `.claude/skills/**`, `skills/**`를 생성·복사·동기화하지 않는다. 실행 전에 존재하던 local skill 경로는 읽기 전용으로 분류·보고하고 승인 없이 변경하지 않는다. Claude 대상 setup은 프로젝트 루트부터 파일시스템 루트까지 `CLAUDE.md`, `.claude/CLAUDE.md`, `CLAUDE.local.md`를 검사한다. 관리 중인 구형 루트 bridge만 승인된 갱신에서 제거하고, 사용자 내용 또는 상위 경로 파일은 보존한 채 중단한다.

새 하네스의 문서 루트는 `.ai-docs/` 하나뿐이다. 이전 이름 `.docs/`만 있는 프로젝트는 일반 초기 설정·갱신이 아니라 이관 모드로 분류한다. 서명 정책이 없으면 `harness-setup`이 전체 이동 계획과 바뀔 참조를 보여주고 별도 승인을 받는다. 서명 정책이 있으면 `admin`이 `project-write-access`의 `migrate-root-plan`과 `migrate-root`로 정책·Git 훅·AI 가드 경로까지 함께 이관한다. `.docs/`와 `.ai-docs/`가 함께 있으면 자동 병합하지 않는다.

공유 runtime의 `allowed-tools`에는 제한 없는 `Bash`를 사전 승인하지 않는다. shell 명령은 각 플랫폼의 일반 permission mode를 따르며, 커밋·Git 설정·작업 지침 명령 실행처럼 부작용이 있는 스킬은 사용자가 명시 호출한다.

## 3. 시작 전에 결정할 것

### 3.1 입력 상태

| 현재 상태 | 진입점 |
|-----------|--------|
| 아이디어나 내부 요구사항만 있음 | `design-doc` |
| RFP·SFR·기획 문서가 있음 | 파일이나 내용을 `design-doc`, `design-prototype-docs`, 다중 화면·페어 다중 기능용 `impl-fe-be-doc`에 직접 제공 |
| 문서 없는 기존 코드베이스 | `harness-bootstrap` |
| 설계·컨텍스트는 있고 새 기능을 시작함 | `impl-doc` 또는 `impl-fe-be-doc` |
| 구현 계획이 있고 Phase를 시작함 | 재사용 검토 후 구현. 선택지: `impl-reuse-scan` |
| Phase 구현이 끝남 | 계획 대비 검증. 선택지: `impl-verify` |
| 커밋을 준비함 | 필요한 리뷰·문서 감사·재검증 후 사용자가 `commit` 명시 호출 |

RFP는 별도의 중간 스킬을 거치지 않고 RFP 원문 해석을 지원하는 producer에 직접 입력한다. 단일·소규모 `impl-doc`은 승인된 설계나 PRD를 입력으로 삼는다.

### 3.2 단일 앱과 복수 앱

**단일 애플리케이션**은 앱 repo 안에서 코드와 하네스 문서를 함께 관리한다.

```text
my-app/
├── .ai-docs/
├── AGENTS.md
└── src/
```

**복수 애플리케이션**은 프로젝트 최상위 폴더 아래 앱 repo들과 공용 `.ai-docs` repo를 분리하는 것을 권장한다.

```text
my-project/              ← 보통 git 미관리
├── app-frontend/        ← 별도 git repo
├── app-backend/         ← 별도 git repo
├── .ai-docs/            ← 별도 git repo 권장
└── AGENTS.md            ← 실행용
```

복수 앱에서 `.ai-docs/root-context/AGENTS.md`가 루트 컨텍스트의 관리 원본이고 루트 `AGENTS.md`는 실행용이다. 기존 `.ai-docs` repo가 있다면 빈 골격을 새로 만들기 전에 올바른 위치에 clone/pull해서 복원한다.

### 3.3 작업 규모

작업 규모는 문서의 깊이와 Phase 크기를 결정한다.

| 규모 | 예시 | 운영 방식 |
|------|------|-----------|
| 소규모 | 단일 API, 컴포넌트 하나, 작은 스크립트 | 짧은 설계와 `impl-doc`, 태스크 단위 검증 |
| 중규모 | 한 기능의 FE 또는 BE, 여러 파일의 모듈 | 명시적 Phase와 재사용 점검 |
| 대규모 | FE/BE 페어, 다중 화면, RFP 기능군 | 상세 설계, `impl-fe-be-doc`, Phase별 사용자 확인 |

### 3.4 구현 계획 축

| 질문 | `impl-doc` | `impl-fe-be-doc` |
|------|------------|------------------|
| 중심 단위 | 단일 기능·모듈·입출력 파이프라인 | FE/BE 페어 또는 화면 |
| 적합 대상 | 단일 BE/FE 기능, CLI, 배치, 스크립트, 라이브러리 | 풀스택 다중 기능, 다중 화면, RFP/SFR 화면 |
| Phase 완료 기준 | 해당 기능이나 입출력 결과가 검증됨 | 연결된 FE/BE 또는 화면 하나가 검증됨 |

FE/BE 페어 다중 기능을 함께 끝내거나 여러 화면의 흐름을 다루면 `impl-fe-be-doc`을 쓴다. 화면 1개, API 1~수개, 단일 full-stack 기능을 포함한 단일·소규모 범용 작업은 `impl-doc`을 쓴다.

## 4. 설치와 초기 세팅

### 4.1 플랫폼별 명시 호출

| 인터페이스 | 설치 후 첫 호출 |
|------|----------------|
| Codex CLI·앱 | `$harness-setup` |
| Claude Code CLI·Claude 앱 | `/harness-kit:harness-setup` |

Codex는 설치 후 새 task를 열고 필요하면 앱을 재시작한다. Claude Code는 `/reload-plugins` 후 새 session에서 확인한다. 스킬이 보인다는 사실은 설치 성공의 증거지만, 실제 산출물 계약을 지켰다는 증거는 아니다.

### 4.2 `harness-setup` 확인 순서

1. 대상 프로젝트 루트를 확정한다.
2. 단일 앱인지 복수 앱인지 판정한다.
3. 신규 세팅인지 기존 `.ai-docs`의 갱신·복구인지 판정한다.
4. 생성·갱신 예정 경로를 미리 확인한다.
5. `.ai-docs` 안내·정책 파일과 루트 컨텍스트를 만든다.
6. 링크, bridge, 앱별 context 참조를 검증한다.
7. Markdown bundle의 문서 개선안을 검토한다.
8. 프로젝트 local skill 경로를 만들지 않았는지 확인한다.

`harness-setup`은 플러그인 설치기나 스킬 동기화기가 아니다. 사용자 스킬 directory가 생겼다면 정상 결과로 보지 않는다.

모든 참여자는 자기 작업 환경에서 이 확인을 최초 1회 수행한다. 플러그인 공지가 프로젝트 하네스 갱신을 요구하거나 앱 경계가 바뀌거나 골격 복구가 필요할 때만 update mode로 다시 실행한다. 서명 권한 정책이 활성화된 뒤 공유 루트·하네스 파일을 실제로 갱신하는 주체는 `admin`이다. 다른 참여자는 갱신된 파일을 받은 뒤 자기 환경의 읽기·로컬 연결 상태를 확인한다. update mode는 관리 블록 밖의 사용자 내용을 보존한다.

### 4.3 Git 작성자 계정과 문서 쓰기 권한

단일·복수 repo의 모든 참여자는 `git-scoped-account`를 자기 PC에서 최초 1회 명시 호출한다. 공통 config의 `user.name`·`user.email` 출처와 저장소별 provider·host·login 표식을 확인한다. 새 PC·새 clone, 계정 변경 또는 컨테이너 바로 아래 repo 추가 때 다시 실행한다.

문서 쓰기 권한을 분리할 때는 원격 Git provider와 저장소, 참여자 계정이 먼저 준비돼야 한다. 관리자는 `project-write-access`를 명시 호출해 공유 정책을 설정한다. `harness-setup`과 참여자별 Git 계정 등록을 먼저 마치고, `design-doc`, `context-doc`, 앱 핵심 문서를 만드는 `harness-bootstrap`보다 앞서 적용한다. 공유 정책이 생긴 뒤 각 참여자는 `git-scoped-account`의 로컬 등록 분기로 현재 PC의 Git 훅과 AI 쓰기 가드를 연결한다. 이 분기는 관리자 키·공유 정책·CODEOWNERS·원격 설정을 바꾸지 않는다.

- `admin`: 권한 정책, `.ai-docs/harness/**`, 루트 에이전트 지도와 소유자·가드 설정을 관리한다. 앱 핵심 문서 권한을 상속하지 않는다.
- `pm-pl`: 모든 앱의 설계 정본, 앱 컨텍스트와 instruction을 관리한다.
- `app-doc-lead`: 배정된 앱에서 `pm-pl`과 같은 종류의 핵심 문서를 관리한다.
- `developer`: 일반 기여자임을 명시하는 역할이다. 등록 여부와 관계없이 기존 저장소 권한으로 `impl-doc/**`, `prototype/**`, `_inbox/**` 같은 `team` 범위와 앱 소스코드를 사용한다.

이 스킬은 문서 쓰기 권한만 관리하고 소스코드 권한은 바꾸지 않는다. 권한이 있는 `pm-pl` 또는 해당 앱의 `app-doc-lead`가 앱 핵심 문서를 AI로 쓸 때도 문서 역할·대상 파일·변경 이유를 설명하고 한 번 더 확인한다. PC별 로컬 등록을 하지 않으면 지원되는 AI 가드는 `.ai-docs/**` 쓰기를 중단하지만, 로컬 Git 훅이 아직 연결되지 않은 PC의 사람 편집까지 막는다고 보지는 않는다. CODEOWNERS는 서버 보호 규칙과 결합해야 병합을 강제하며, 로컬 Git 훅과 AI 쓰기 가드는 각각 우회 가능성과 host 신뢰 경계를 가진다.

### 4.4 `.ai-docs` 초기 골격과 진행 후 구조

`harness-setup` 직후에는 `.ai-docs/README.md`, `.ai-docs/.gitignore`, `.ai-docs/_inbox/`, 루트 컨텍스트 골격을 만든다. 복수 앱이면 빈 앱별 context와 instruction 디렉터리, `.ai-docs/root-context/`도 준비한다.

아래 트리는 `design-doc`, `context-doc`, `impl-*`과 prototype·design-system producer의 산출물이 누적된 **대표 구조**다. `context-base/`, `impl-doc/`, `prototype/`, `design-system/`, `.harness/`가 setup만으로 모두 생긴다는 뜻은 아니다.

단일 앱의 대표 구조:

```text
.ai-docs/
├── README.md
├── .gitignore
├── _inbox/                    ← 기본 local 참고 입력, 명시적 파일별 Git 공유 가능
├── context-base/
│   └── DESIGN.md
├── instruction/
├── impl-doc/
├── prototype/
├── design-system/
└── .harness/
    └── humanize-handoffs.json
```

복수 앱의 대표 구조:

```text
.ai-docs/
├── README.md
├── .gitignore
├── _inbox/
├── app-frontend-context.md
├── app-frontend/
│   ├── context-base/
│   ├── instruction/
│   ├── impl-doc/
│   ├── prototype/
│   └── design-system/
├── app-backend-context.md
├── app-backend/
│   ├── context-base/
│   ├── instruction/
│   └── impl-doc/
├── root-context/
│   └── AGENTS.md
└── .harness/
    └── humanize-handoffs.json
```

`_inbox/`의 파일은 기본적으로 `.ai-docs/.gitignore`에 따라 로컬에서만 보관한다.
설계·instruction에 계속 참고해야 하는 원문을 팀과 공유하려면 사용자가 정확한 파일
경로와 Git 공유 의도를 명시적으로 요청한 경우에만 해당 파일을
`git add -f -- <현재 Git 저장소 기준 정확한 파일 경로>`로 선택 추적한다. 민감정보·
저작권·저장소 용량을 먼저 확인하고 `_inbox/` 전체를 강제 추가하지 않는다. 선택 추적된
원문은 다른 사용자의 clone/pull에도 포함되지만 정규 설계·instruction 산출물로 승격된
것은 아니다. commit과 원격 push는 각각 별도의 명시적 요청이 있을 때만 수행한다.

복수 앱에서는 문서·프로토타입·디자인 시스템 산출물을 공유 루트에 두지 않고 항상 대상 앱의 `.ai-docs/{앱}/` 아래에 분리한다.

## 5. 전체 사용자 흐름

```mermaid
flowchart TD
    S["플러그인 설치·새 session"] --> H["모든 참여자: harness-setup<br/>작업 환경별 최초 1회"]
    H --> GA["모든 참여자: git-scoped-account<br/>단일·복수 repo 모두 PC별 최초 1회"]
    GA --> A{"문서 쓰기 권한을<br/>분리하는가?"}
    A -->|"예"| RP["원격 provider·저장소와<br/>참여자 계정 확인"]
    RP --> PA["관리자: project-write-access<br/>공유 정책 설정"]
    PA --> LE["모든 참여자: 현재 PC<br/>로컬 등록"]
    A -->|"아니오"| X{"진입 유형"}
    LE --> X
    X -->|"신규·요구사항 기반"| D["권한 범위에 맞게<br/>design-doc"]
    X -->|"하네스 문서 없는 기존 코드"| B["권한 범위에 맞게<br/>harness-bootstrap"]
    D --> C["context-doc"]
    D --> P["선택: design-prototype-docs"]
    P --> CP["create-prototype"]
    C --> I{"구현 계획 선택"}
    B --> I
    CP --> I
    I --> ID["impl-doc"]
    I --> IF["impl-fe-be-doc"]
    ID --> RS["선택: 재사용 검토<br/>예: impl-reuse-scan"]
    IF --> RS
    RS --> W["Phase·태스크 구현<br/>제품 UI 도구 선택"]
    W --> IV["선택: 구현 검증<br/>예: impl-verify"]
    IV --> MR["선택: 코드 리뷰"]
    MR --> DA["선택: 문서 감사"]
    DA --> CO["선택: code-comment"]
    DA --> CM["명시 요청: commit<br/>scope·diff 확인 → 선택 stage → hook → commit"]
    CO --> CM
```

아래 비기반 스킬 이름은 Harness Kit가 제공하는 선택지다. 다른 설치 스킬·플러그인·일반
Agent도 같은 산출물 유형의 정규 경로·owner·승인·형식·evidence 계약을 따르면 된다.
문체 개선은 사용자가 명시적으로 요청한 경우에만 **원 producer 검증 → 개선안·사용자
결정 → 승인 변경 반영 → 원 producer 재검증** 순서로 수행한다.

### 5.1 1단계 — 설계와 컨텍스트

#### 신규·요구사항 기반

1. 권한 정책이 활성화돼 있으면 현재 PC의 로컬 등록과 Git 계정을 확인하고, `pm-pl`인지 대상 앱의 `app-doc-lead`인지 판정한다. `admin` 역할만으로는 앱 문서를 쓸 수 없다.
2. 프로젝트 전체 설계라면 앱의 대분류, 관련 코드와 기존 문서를 `design-doc`에 제공한다.
3. 앱 개요와 구축 대상 기능은 대분류 수준으로 두고, 기술 스택을 근거로 제안된
   아키텍처 패턴과 패키지·파일 구조 예시를 검토해 선택한다.
4. 고정 목차의 PROJECT_DESIGN 초안을 검토한다. 화면·기능·컴포넌트 상세 설계는
   기존 OUTPUT_V2를 사용하며, 상위 기능 분류에 없는 항목도 작성할 수 있다.
   PROJECT_DESIGN 본문은 변경 이력을 누적하지 않고 현재 기준 사실만 유지한다.
5. 후속 workflow에서 쓸 경우 저장을 승인한다.
6. 저장된 설계를 같은 역할·앱 범위에서 `context-doc`에 입력한다.
7. `{앱}-context.md`와 필요한 instruction 파일을 검토하고 저장한다. 루트 `AGENTS.md`
   갱신이 필요하면 `harness-setup` 후속 작업으로 분리한다.

`design-doc`의 기본 저장 경로:

- 단일 앱: `.ai-docs/context-base/DESIGN.md`
- 복수 앱: `.ai-docs/{앱}/context-base/DESIGN.md`

#### 기존 코드베이스

`harness-bootstrap`은 기존 코드의 설계와 컨텍스트를 역추출하는 흐름을 하나의 최외곽 bundle로 묶는다. 호출자의 작업 환경에서 `harness-setup`을 아직 수행하지 않았다면 내부 setup이 그 호출자의 최초 실행을 담당한다. 문서 권한을 분리하는 프로젝트는 독립된 `harness-setup`과 참여자별 `git-scoped-account`를 먼저 수행한다. 관리자가 `project-write-access` 공유 정책을 설정하고 현재 PC 로컬 등록까지 마친 뒤, 허용된 역할·앱 범위에서 `harness-bootstrap`을 실행한다.

```text
harness-setup 골격 확인
→ repository·stack·구조 스캔
→ 관찰과 사용자 답변 구분
→ design-doc PROJECT_DESIGN 초안
→ context-doc 산출물
→ 일괄 미리보기·승인
→ 저장·구조 검증
→ 사용자가 명시 요청한 경우에만 bundle당 한 번의 문서 개선 제안
```

자식 `harness-setup`, `design-doc`, `context-doc`은 같은 bundle 안에서 별도 `humanize-korean` 제안을 만들지 않는다.

#### 컨텍스트 문서

`context-doc`은 앱별 `DESIGN.md`와 현재 코드·설정·Git 정보를 다음처럼 분리한다.

| 내용 | 생성 대상 |
|------|-----------|
| DESIGN 참조·요약, 프로젝트 개요, 기술 스택, 아키텍처, 실행 프로필, Git, 배포, 계층형 앱 특이사항, 환경 변수, AI 구현 지침 인덱스, 구축 대상 기능 분류 | `.ai-docs/{앱}-context.md` |
| 모듈·레이어·의존성 | `architecture-instruction.md` |
| 앱 고유 용어·식별자·코드 표준 | `data-standard-instruction.md` |
| 네이밍·예외·주석 | `code-style-instruction.md` |
| 프레임워크·라이브러리 규칙 | `framework-instruction.md` |
| API 규약 | `api-instruction.md` |
| WebSocket·메시지큐 등 통신 | `comm-instruction.md` |
| 파일 위치·네이밍 | `file-convention-instruction.md` |
| 에이전트 전용 행동 규칙 | `agent-instruction.md` |

최초 생성에서는 참조 앱에서 반복적으로 쓰인 `architecture`, `data-standard`,
`code-style`, `framework`, `file-convention` instruction을 제목과 보편 목적만 있는
골격으로 준비한다. HTTP API와 비-HTTP 통신 파일은 기술의 존재가 아니라 독립해서
반복 적용할 현재 규칙이 확인될 때만 같은 형식으로 만든다. `agent-instruction.md`와
`artifact-output-routing-instruction.md`는 항상 생성한다.
앱 컨텍스트 제목 아래에는 대응 DESIGN의 `@` 참조와 링크, 두 문서의 양방향 최신화
원칙을 적는다. 최상단과 9번 항목에는 루트 컨텍스트 → 앱 컨텍스트 → AI가 판단한 작업
관련 instruction의 필독 순서를 둔다. 7번 애플리케이션 특이사항은 핵심 도메인 개념을
포함한 계층형 하위 노드로 구성하고, 명명·약어·식별자 표현·코드값 규범은
`data-standard-instruction.md`로 분리한다. 10번 기능 분류는 DESIGN.md 02와 같은 노드명·
순서·부모-자식 관계·Depth를 유지하며 현재 구현 위치를 연결한다. 본문에는 변경 이력을
쌓지 않고 현재 유효한 사실만 남긴다. 최초 목적 골격은 프로젝트 규칙의 근거로 사용하지
않으며, 이후 현재 근거가 확인되면 본문을 갱신한다. 재실행에서 더 이상 적용할 이유가
없는 선택 instruction은 삭제 후보와 근거를 먼저 보여주고 승인 후 파일과 9번 인덱스
행을 함께 제거한다. 남은 instruction에도 과거 규칙이나 삭제 이력을 기록하지 않는다.

단일 앱은 instruction을 `.ai-docs/instruction/`, 복수 앱은 `.ai-docs/{앱}/instruction/`에
저장한다. 두 유형 모두 앱 컨텍스트는 `.ai-docs/{앱}-context.md`에 저장한다.
루트 폴더는 보통 git으로 관리하지 않으므로 `.ai-docs/root-context/AGENTS.md`가 루트 정본 내용을 형상관리하는 실제 원본이다. 루트 실행용 `AGENTS.md`의 최종 갱신은 `harness-setup` 계약이 담당한다.

#### 화면을 먼저 검증할 때

```text
design-doc
→ 선택한 화면 명세 producer
→ 단일 .ai-docs/prototype/{사용자}/{식별자}/design-doc.md
  복수 .ai-docs/{앱}/prototype/{사용자}/{식별자}/design-doc.md
→ 선택한 프로토타입 producer
→ 단일 .ai-docs/prototype/{사용자}/{식별자}/
  복수 .ai-docs/{앱}/prototype/{사용자}/{식별자}/
```

`design-prototype-docs`와 `create-prototype`은 위 두 producer의 제공 선택지다.

프로토타입은 요구사항과 이동 흐름을 검증하는 폐기 가능한 산출물이다. 실제 제품 코드로 그대로 승격하지 않는다.

### 5.2 2단계 — 구현 계획

1. 설계 문서와 대상 앱을 확정한다.
2. 구현 계획 producer를 고른다. `impl-doc`과 `impl-fe-be-doc`은 제공 선택지다.
3. Phase별 목표, 작업 ID, 수정 예상 파일, 검증 방법, 완료 기준을 정한다.
4. 초안과 파일명을 검토한다.
5. 계획서와 roadmap index를 저장한다.
6. 원 producer 검증을 마치고, 사용자가 문체 개선을 요청한 경우에만 승인형 개선을 수행한다.
7. 필요하면 구현 전 재사용 검토를 수행한다. `impl-reuse-scan`은 제공 선택지다.

구현 계획 기본 경로:

- 단일 앱: `.ai-docs/impl-doc/{사용자}/{YYMMDD}-{seq}.{slug}-impl-{kind}.md`
- 복수 앱:
  `.ai-docs/{앱}/impl-doc/{사용자}/{YYMMDD}-{seq}.{slug}-impl-{kind}.md`
- 공용 index:
  `{YYMMDD}-0.{앱이름}-roadmap-impl-index.md`

두 impl 스킬은 같은 디렉터리와 index를 공유한다. 생성 스킬은 파일명 대신 문서 머리말의 `생성 스킬`로 구분한다.

`impl-reuse-scan`은 기존 공통 자산과 패턴을 후보로 보고한다. 자동 반영하지 않으므로, 사용할 후보와 사용하지 않을 후보를 사람이 결정한다.

### 5.3 3단계 — 작은 단위 구현과 검증

한 번의 작업 턴에는 하나의 Phase 또는 명확한 태스크 집합만 넣는다.

좋은 요청은 다음 네 가지를 포함한다.

- 참조해야 할 설계·컨텍스트·구현 계획
- 이번 턴의 Phase 또는 태스크 ID
- 수정 허용 파일과 금지 범위
- 실행할 검증과 완료 기준

아래 경로는 플랫폼의 파일 첨부 또는 경로 참조 기능으로 제공한다.

예시:

```text
참조 설계: .ai-docs/context-base/DESIGN.md
참조 계획: .ai-docs/impl-doc/developer/260730-1.user-search-impl-api.md

Phase 2의 API-03만 구현해줘.
수정 범위는 search service, controller, 관련 test로 제한한다.
공통 인증 모듈과 다른 Phase는 변경하지 말 것.
완료 후 실행한 테스트와 남은 위험을 보고해줘.
```

UI를 실제로 구현할 때는 승인된 앱 source에 맞는 구현 도구를 선택한다. 문서나 검증용
시안에는 `design-prototype-docs`, `create-prototype` 또는 동등한 producer를 선택할 수 있다.

Phase가 끝나면 선택한 검증 도구로 계획 대비 결과와 evidence를 남긴다. `impl-verify`는
PASS/FAIL/SKIP 보고를 제공하는 선택지이며, 다른 도구를 써도 실행하지 못한 검증을 통과로
기록하지 않는다. FAIL이 있으면 구현 또는 계획 단계로 돌아간다.

### 5.4 4단계 — 품질과 커밋

필요한 항목만 고르는 권장 순서:

```text
선택: 구현 검증
→ 선택: 코드 리뷰
→ 선택: 문서 감사
→ 필요한 수정과 재검증
→ 선택: code-comment
→ 사용자 명시 요청: commit
  └─ 지침·status·diff·최근 log 확인 → 의도한 파일만 stage → 정상 hook → commit·사후 증거
```

- `multi-review`: 보안, 성능, 유지보수, 테스트 네 관점의 위험을 우선순위와 함께 보고한다.
- `doc-audit`: 코드와 문서의 괴리를 분석하고 변경 제안을 대화창에 제시한다. 승인 전 문서를 쓰지 않는다.
- `code-comment`: 코드만 봐서는 의도와 제약을 이해하기 어려운 부분에 한글 주석을 보강한다. 모든 줄에 설명을 붙이지 않는다.
- `commit`: 사용자가 명시 호출했을 때만 지침, staged·unstaged·untracked 범위, diff, 최근 log와 검증 결과를 확인한다. 기존 범위 밖 staged 변경을 보존하고 의도한 파일만 stage한 뒤 정상 hook과 Conventional Commit을 실행하며, 완료 후 SHA·`git show`·status·남은 변경을 확인한다.

리뷰에서 커밋으로 자동 handoff하지 않는다. commit, push, amend, tag, branch 생성은 각각 필요한 명시적 사용자 요청과 해당 확인 절차를 거친다.

## 6. Markdown producer와 `humanize-korean`

여기서 producer는 Markdown 파일이나 문서 묶음을 생성·갱신하고 저장 경로와 필수 구조,
링크, index, bridge를 검증한 뒤 다음 단계로 인계하는 산출물 책임 주체다. 아래 9종은
Harness Kit가 제공하는 producer이며 독점 실행 목록이 아니다.

고정 producer 7종:

- `harness-setup`
- `harness-bootstrap`
- `design-doc`
- `context-doc`
- `design-prototype-docs`
- `impl-doc`
- `impl-fe-be-doc`

조건부 producer 2종:

- `ui-ux-pro-max`
- `motion-design`

조건부 2종은 기본적으로 대화창에 결과를 보고한다. 사용자가 디자인 시스템이나 모션 명세의 저장을 명시적으로 요청했을 때만 Markdown 파일을 만든다. 모든 producer는 단일 앱의 `@.ai-docs/instruction/artifact-output-routing-instruction.md` 또는 복수 앱의 `@.ai-docs/{앱}/instruction/artifact-output-routing-instruction.md`에 따라 산출물 위치·소유권·인계를 결정한다.

사용자가 문체 개선을 명시적으로 요청했을 때만 적용하는 후처리 계약:

1. 최외곽 producer가 안정적인 `artifact_bundle_id`와 `handoff_owner`를 만든다.
2. 중첩 producer에는 같은 ID와 owner, `suppress_child_handoff=true`를 전달한다.
3. 원 producer가 필수 섹션, 저장 경로, 링크, index, bridge를 먼저 검증한다.
4. owner만 bundle 전체를 `humanize-korean`의 `document-refinement` profile에 한 번 넘긴다.
5. `humanize-korean`은 개선안·변경 이유·diff를 먼저 제시한다.
6. 보호 token, 경로, 코드블록, 표, 링크, 식별자를 보존한다.
7. 사용자가 승인한 변경만 반영한다.
8. 원 producer가 원래 구조 계약을 다시 검증한다.
9. downstream 도구는 승인·재검증된 최종 Markdown을 입력으로 사용한다.

제안, 건너뛰기, 거절, 적용, 재검증 상태 이벤트는 `.ai-docs/.harness/humanize-handoffs.json`에 기록한다. 최종 Markdown 상대경로, 내용 SHA-256, profile로 계산한 fingerprint에 기존 결정이 있으면 새 session에서 같은 제안을 반복하지 않는다.
상태가 `proposed`라면 이미 제안이 존재함을 보고하고, 건너뛰기·거절·적용·재검증 상태는 그 결정을 재사용한다. ledger 자체는 문서 개선 대상에서 제외한다.

사용자가 개선을 건너뛰거나 거절해도 원래 하네스 흐름은 계속된다.

## 7. 사용자 스킬 맵

| 계열 | 스킬 | 역할 |
|------|------|------|
| 설치·기반 | `harness-setup` | 프로젝트 문서 골격과 루트 컨텍스트 생성·복구 |
| 설치·기반 | `harness-bootstrap` | 기존 코드에서 설계·컨텍스트 역추출 |
| 설치·기반 | `git-scoped-account` | 단일·복수 repo의 작성자와 provider 계정을 프로젝트 범위 및 PC별 권한 가드에 연결 |
| 권한 | `project-write-access` | 문서 경로를 상속 없는 `admin`·`pm-pl`·앱별 `app-doc-lead`·`developer` 역할과 세 제어 계층에 연결 |
| 설계 | `design-doc` | 프로젝트 전체는 확장 가능한 PROJECT_DESIGN 기준 문서로, 상세 단위는 OUTPUT_V2 설계로 변환 |
| 컨텍스트 | `context-doc` | 앱 컨텍스트와 주제별 instruction 생성. 루트 지도 변경은 `harness-setup` 후속 작업으로 분리 |
| UI/UX 설계 | `ui-ux-pro-max` | 제품 유형·스타일·색·타이포그래피·레이아웃·접근성 결정 |
| 모션 설계 | `motion-design` | 모션 목적·타이밍·이징·안무·접근성·성능 결정 |
| 화면 설계 | `design-prototype-docs` | 프로토타입 입력용 화면 설계 문서 |
| 프로토타입 | `create-prototype` | 화면별 HTML/CSS/JS/JSON 기반 검증 시안 |
| 제품 UI | `frontend-design` | 실제 UI 구현 품질 기준 |
| 구현 계획 | `impl-doc` | 단일·소규모 범용 작업 계획 |
| 구현 계획 | `impl-fe-be-doc` | FE/BE 페어·다중 화면 작업 계획 |
| 구현 전 점검 | `impl-reuse-scan` | 재사용 후보 발견·보고 |
| 구현 검증 | `impl-verify` | Phase·태스크 검증 매트릭스 |
| 품질 | `multi-review` | 4관점 코드 리뷰 |
| 품질 | `commit` | 명시 요청에 한한 범위 확인·선택 stage·정상 hook·Conventional Commit·사후 증거 |
| 품질 | `code-comment` | 필요한 변경 코드 한글 주석 |
| 문서 | `doc-audit` | 코드·문서 괴리 분석 |
| 문서 | `humanize-korean` | Markdown 개선안과 diff |

현재 입력·배포 규칙:

- RFP는 이를 해석하는 `design-doc`, `design-prototype-docs`, `impl-fe-be-doc`에 직접 입력한다.
- Harness Kit 사용자 스킬의 설치·업데이트는 프로젝트 파일이 아니라 플러그인이 담당한다.
  이 배포 규칙은 다른 설치 스킬·플러그인·일반 Agent를 금지하지 않는다.
- 커밋은 `commit`이 범위·diff·검증·정상 hook·사후 증거를 확인한다.

`custom-skill-design`은 반복 업무를 스킬로 만들기 위한 **관리자 스킬**이다. 프로젝트 사용자가 local custom skill을 만들도록 배포하지 않는다. 반복되는 workflow가 보이면 관리자에게 후보와 사례를 전달한다.

### 7-1. 디자인 전용 흐름

§5의 일반 흐름을 대체하지 않는다. UI 판단이 필요한 작업에서만 그 안에서 갈라져 나오는 선택적 흐름이다.

```mermaid
flowchart TD
    R["승인된 요구사항 또는 design-doc"] --> U["선택한 디자인 판단 도구"]
    U --> S["선택한 화면 명세 producer"]
    S --> M{"모션이 필요한가?"}
    M -->|"예"| MD["선택한 모션 설계 도구"]
    M -->|"아니오"| B{"최종 목적"}
    MD --> B
    B -->|"검증용 프로토타입"| P["선택한 프로토타입 producer"]
    P --> A{"사용자 검토"}
    A -->|"프로토타입만"| PV["선택한 검증 도구"]
    A -->|"실제 구현 승인"| F["선택한 제품 구현 도구"]
    B -->|"실제 제품 화면"| F
    F --> V["선택한 검증 도구"]
```

아래 스킬명은 Harness Kit가 제공하는 선택지의 역할 표이며 이 순서나 호출 자체가 완료 조건은 아니다.

| 단계 | 입력 | 산출물 | 승인 gate | 검증 |
|---|---|---|---|---|
| `ui-ux-pro-max` | 제품 유형·업종·스택·접근성 요구 | 대화창 디자인 결정과 근거 | 저장 시 승인 필요 | 기존 토큰 우선 여부 |
| `design-prototype-docs` | 디자인 결정 또는 기존 시스템 | 화면·상태·반응형 명세 `.md` | producer gate | 7개 품질 기준 |
| `motion-design` | 모션 후보와 목적 | 모션 결정표 | 저장 시 승인 필요 | reduced-motion 대체안 필수 |
| `create-prototype` | 승인된 명세와 모션 | 단일 `.ai-docs/prototype/**`, 복수 `.ai-docs/{앱}/prototype/**` | — | 시안·요구사항 일치 |
| `frontend-design` | 승인된 결정과 명세 | 제품 소스 | — | 기능·UI·접근성·모션 |

#### 호출·생략 조건

| 스킬 | 호출 | 생략 |
|---|---|---|
| `ui-ux-pro-max` | 디자인 방향·토큰·레이아웃을 정할 때, 기존 화면 UX·접근성 리뷰 | 백엔드 전용, 명세 확정 후 단순 구현, 문구·데이터만 수정 |
| `motion-design` | 전환·상태 피드백·등장 순서·브랜드 모션 설계, 기존 애니메이션 리뷰 | 정적 화면으로 충분, 요구사항에 모션 없음, 기존 모션 명세 그대로 적용 |

#### producer 중립 handoff 계약

디자인 흐름은 상대 스킬의 내부 파일이나 상대경로에 결합하지 않는다. 연결은 artifact
의미·정규 경로·owner·승인·형식·evidence로 전달한다. 공개 Harness Kit 스킬 이름은
사용 가능한 producer를 고를 때의 참조 이름이며 다른 도구를 배제하지 않는다.

#### 선택적 저장 경로

`ui-ux-pro-max`와 `motion-design`의 기본 동작은 대화창 보고다. 사용자가 명시적으로 요청할 때만 저장한다.

| 담당 스킬 | 단일 앱 | 복수 앱 |
|---|---|---|
| `ui-ux-pro-max` | `.ai-docs/design-system/{project-slug}/MASTER.md`, `.ai-docs/design-system/{project-slug}/pages/{page-slug}.md` | `.ai-docs/{앱}/design-system/{project-slug}/MASTER.md`, `.ai-docs/{앱}/design-system/{project-slug}/pages/{page-slug}.md` |
| `motion-design` | `.ai-docs/design-system/{project-slug}/motion/{screen-or-component}.md` | `.ai-docs/{앱}/design-system/{project-slug}/motion/{screen-or-component}.md` |

기존 파일이 있으면 diff를 제시하고 승인 전에는 덮어쓰지 않는다. 사용자가 문체 개선을
명시 요청한 경우에만 최외곽 생성자가 `humanize-korean` 개선안을 한 번 제안한다. 색상값,
토큰 이름, duration, easing, reduced-motion 조건, 성능 budget은 문서 개선 단계의 보호
토큰이며 개선으로 값이 바뀌지 않는다.

#### 두 분기의 경계

프로토타입 산출물은 폐기 가능한 검증 자료다. **제품 소스로 복사하지 않는다.** 승인 후
실제 구현으로 넘어갈 때는 승인된 디자인 결정과 화면 명세만 전달하고, 선택한 제품 구현
도구가 기존 컴포넌트·토큰·프레임워크에 맞게 다시 구현한다. `frontend-design`은 제공
선택지다. 어떤 도구를 선택하든 두 분기에서 목적에 맞는 검증과 evidence를 남긴다.

## 8. 산출물과 형상관리

| 산출물 | 기본 위치 | 소유와 형상관리 |
|--------|-----------|----------------|
| 설계 | `.ai-docs/**/context-base/DESIGN.md` | 프로젝트 문서 |
| 루트 컨텍스트 | `AGENTS.md` | 단일 앱은 루트 `AGENTS.md` 정본, 복수 앱은 `.ai-docs/root-context/AGENTS.md` Git 관리 원본과 루트 실행본 |
| 세부 규칙 | `.ai-docs/**/instruction/*-instruction.md` | 프로젝트 문서 |
| 화면 설계 | 단일 `.ai-docs/prototype/{사용자}/{식별자}/design-doc.md`, 복수 `.ai-docs/{앱}/prototype/{사용자}/{식별자}/design-doc.md` | `design-prototype-docs`가 관리하는 프로젝트 문서 |
| 프로토타입 | 단일 `.ai-docs/prototype/{사용자}/{식별자}/`, 복수 `.ai-docs/{앱}/prototype/{사용자}/{식별자}/` | `create-prototype`이 만드는 폐기 가능한 검증 산출물 |
| 디자인 시스템 | 단일 `.ai-docs/design-system/{project-slug}/MASTER.md`·`pages/{page-slug}.md`, 복수 `.ai-docs/{앱}/design-system/{project-slug}/MASTER.md`·`pages/{page-slug}.md` | `ui-ux-pro-max`가 명시적 저장 요청 때만 생성 |
| 모션 명세 | 단일 `.ai-docs/design-system/{project-slug}/motion/{screen-or-component}.md`, 복수 `.ai-docs/{앱}/design-system/{project-slug}/motion/{screen-or-component}.md` | `motion-design`이 명시적 저장 요청 때만 생성 |
| 구현 계획·index | `.ai-docs/**/impl-doc/{사용자}/` | 구현 근거와 진행 index |
| handoff ledger | `.ai-docs/.harness/humanize-handoffs.json` | 개선 제안 중복 방지 상태 |
| 코드·테스트 | 각 앱 repo | 앱별 형상관리 |
| 사용자 스킬 | 설치된 플러그인 | 프로젝트 repo에 복사하지 않음 |

복수 앱에서 `.ai-docs`가 별도 repo라면 코드 commit과 문서 commit의 연결을 이슈, 작업 ID, 구현 계획 링크 등으로 남긴다. 루트 `AGENTS.md`가 git 미관리 파일이어도 `.ai-docs/root-context/AGENTS.md`는 관리한다.

## 9. 병렬화와 hook 전략

### 병렬화해도 되는 일

- 서로 다른 앱이나 독립된 모듈의 읽기 전용 조사
- 겹치지 않는 파일 집합의 독립 검증
- 보안·성능·테스트처럼 결과를 합칠 수 있는 리뷰 관점
- 여러 앱의 manifest와 실행 명령 탐색

### 순차로 해야 하는 일

- 설계 승인 전 컨텍스트 고정
- 구현 계획 승인 전 코드 변경
- 같은 파일이나 같은 API 계약을 건드리는 작업
- 명시 요청된 문서 개선에서 producer 검증 전 `humanize-korean` 적용
- 문서 개선 반영 후 원 producer 재검증
- 실패한 검증을 설명 없이 건너뛴 커밋

플랫폼의 병렬 agent 기능을 사용할 수는 있지만 특정 모델명이나 agent fork를 스킬 frontmatter에 하드코딩하지 않는다. 작은 초기 세팅은 기본적으로 순차 실행하고, 병렬화 이득과 merge 경계가 명확할 때만 분리한다.

자동 hook에는 빠르고 결정적인 검사를 둔다.

- formatter check
- lint
- type check
- 빠른 unit test
- 금지 파일·secret·대용량 파일 검사

설계 판단과 쓰기 부작용이 있는 작업은 자동 hook으로 숨기지 않는다.

- 문서 구조 변경
- 의존성 추가
- migration 실행
- `doc-audit` 제안 반영
- commit과 push

## 10. AI 코딩 운영 원칙

### 10.1 환경을 역할에 맞게 쓴다

- 대화형 설계·정책 합의: 충분한 문맥을 볼 수 있는 task/session
- 저장소 분석·구현·검증: 실제 프로젝트 파일과 명령에 접근하는 coding agent
- 앱 인터페이스 검증: 실제 설치된 Codex/Claude 앱의 새 session

웹 대화에서 합의한 내용도 최종적으로 프로젝트 문서에 고정하지 않으면 다음 session의 기준이 되지 않는다.

### 10.2 대화 단위를 작게 유지한다

나쁜 요청:

```text
로그인, 관리자 화면, API, 배포까지 전부 만들어줘.
```

좋은 요청:

```text
구현 계획의 Phase 1, BE-02와 관련 테스트만 수행해줘.
인증 공통 모듈과 다른 Phase는 변경하지 말 것.
완료 후 수정 파일, 실행한 검증, 남은 위험을 보고해줘.
```

### 10.3 문서는 고정물이 아니라 변경 계약이다

코드가 설계와 달라졌다면 둘 중 하나를 선택해야 한다.

1. 코드가 잘못됐으면 코드가 설계를 따르게 한다.
2. 설계 결정이 바뀌었으면 `design-doc`과 `context-doc`을 갱신한다.

오래된 문서를 그대로 두는 제3의 선택은 다음 에이전트에게 잘못된 맥락을 준다.

### 10.4 컨텍스트 오염 신호를 알아챈다

다음 신호가 보이면 현재 턴을 더 키우지 말고 범위를 다시 고정한다.

- 이미 끝난 Phase의 파일을 반복해서 고친다.
- 참조하지 말라고 한 예전 문서를 다시 기준으로 삼는다.
- 단일 앱과 복수 앱 경로를 섞는다.
- prototype 코드를 제품 코드로 간주한다.
- `AGENTS.md`와 실제 instruction 링크가 어긋난다.
- 검증 실패를 설명 없이 무시한다.

새 task/session을 열 때는 설계, 컨텍스트, 현재 구현 계획, 정확한 태스크 ID를 다시 제공한다.

### 10.5 반복 workflow는 관리자 개선 후보로 남긴다

같은 프롬프트, 같은 검사, 같은 템플릿 수정이 반복되면 다음을 기록한다.

- 반복되는 입력과 출력
- 성공·실패 사례
- 필요한 도구와 권한
- 보호해야 할 템플릿·스크립트·산출물

프로젝트 안에 임시 사용자 스킬을 복제하는 대신 관리자에게 `custom-skill-design` 또는 기존 스킬 개선 후보로 전달한다.

## 11. 실행·검증 치트시트

프로젝트의 `AGENTS.md`와 package/build 설정에 적힌 명령이 항상 우선이다.

| 확인 대상 | 대표 확인 |
|-----------|-----------|
| Git 범위 | `git status --short`, `git diff`, `git diff --check` |
| JavaScript/TypeScript | `package.json`의 lint, test, typecheck, build script |
| Java | wrapper가 있으면 `mvnw`/`gradlew`의 test·package |
| Python | 프로젝트가 고정한 formatter, type checker, test runner |
| 문서 | 링크·index·bridge·경로, Markdown 구조 |
| 다중 앱 | 앱별 repo status와 공용 `.ai-docs` status를 각각 확인 |

명령이 없거나 실행 환경이 불완전하면 임의의 새 표준을 만들지 말고 SKIP 이유와 남은 검증을 보고한다.

## 12. 사용자 체크리스트

### 프로젝트 최초 도입

- [ ] Codex 또는 Claude에 사용자 플러그인을 설치했다.
- [ ] 새 task/session에서 명시 호출이 보인다.
- [ ] 대상 프로젝트 루트와 단일/복수 앱 유형을 확인했다.
- [ ] 기존 `.ai-docs` repo가 있다면 먼저 복원했다.
- [ ] `harness-setup` 출력이 allowlist 안에만 있다.
- [ ] local user skill directory가 새로 생기지 않았다.
- [ ] `AGENTS.md`가 Codex·Claude의 단일 정본이고 선점하는 Claude instruction 파일이 없다.

### 기능 시작

- [ ] 요구사항·RFP·관련 코드를 설계 입력에 직접 제공했다.
- [ ] 기존 코드라면 `harness-bootstrap`의 관찰과 추정을 구분했다.
- [ ] 설계와 컨텍스트의 변경 승인을 마쳤다.
- [ ] 작업에 맞는 구현 계획 형식과 producer를 골랐다. (`impl-doc`, `impl-fe-be-doc`은 제공 선택지)
- [ ] 문체 개선을 명시 요청했다면 개선 승인과 원 producer 재검증을 마쳤다.
- [ ] Phase 시작 전 재사용 후보를 점검했다.

### Phase 완료

- [ ] 구현 범위가 계획의 태스크와 일치한다.
- [ ] 선택한 검증 도구가 보고한 FAIL을 처리했다. (`impl-verify`는 제공 선택지)
- [ ] 보안·성능·유지보수·테스트 리뷰를 확인했다.
- [ ] 코드와 문서의 괴리를 확인했다.
- [ ] 커밋 전 검사를 통과했다.
- [ ] commit 범위와 메시지가 실제 변경을 설명한다.

---

# 제2부. 관리자용 — 저장소·upstream·플러그인 운영

## 13. 정본 구조와 관리자 역할

| 구분 | 수 | 정본 | 생성물 또는 대상 |
|------|---:|------|-------------------|
| 사용자 스킬 | 20 | `skills/` | `plugins/harness-kit/**` |
| 관리자 스킬 | 3 | `maintainer/skills/` | `.agents/skills/`, `.claude/skills/` |
| upstream·provenance | - | `maintainer/upstreams/` | registry, lock, 비교·반영 증적 |
| plugin metadata | - | `maintainer/inventory/`, `maintainer/plugin/` | manifest, catalog, release 증적 |

관리자 스킬:

| 스킬 | 역할 |
|------|------|
| `custom-skill-design` | Anthropic `skill-creator`를 `adapted` 원본으로, OpenAI Codex 공식 `skill-creator`를 직접 `reference`로 사용해 새 스킬 설계·생성·검증. portfolio provenance는 선택한 Superpowers 스킬 작성 원칙도 별도 `reference`로 추적 |
| `skill-portfolio-maintainer` | 외부 공식·유명 스킬 탐색, integration mode 분류, provenance와 보호 자산 영향 관리 |
| `harness-plugin-maintainer` | 플러그인 build, validate, 설치 인터페이스 증적, release gate |

별도의 관리자 플러그인은 만들지 않는다. 관리자는 repo-local projection을 사용하고, 사용자 경험을 검증할 때 일반 사용자 플러그인을 격리 설치한다.

projection은 직접 편집하지 않는다.

```text
maintainer/skills/ 정본 수정
→ sync_manager_projections.py
→ .agents/skills/와 .claude/skills/ 생성
→ --check로 drift 검증
```

projection에는 관리자 3종만 있어야 하며 `harness-setup`을 포함한 사용자 스킬은 들어가면 안 된다.

## 14. 외부 upstream lifecycle

upstream integration mode는 네 가지다.

| mode | 의미 | 정본 문서 |
|------|------|-----------|
| `native` | 외부 upstream 관계가 없는 로컬 스킬 | registry |
| `reference` | 원칙·workflow·아이디어만 참고하고 원문 자산은 배포하지 않음 | [개념·행동 참조](./Skill_Upstream_Governance.md#concept-behavior-references) |
| `adapted` | upstream 콘텐츠를 번역·수정·재구성함 | [직접 반입·변형 provenance](./Skill_Upstream_Governance.md#direct-import-provenance) |
| `vendored` | upstream 파일을 원문 그대로 복사함 | [직접 반입·변형 provenance](./Skill_Upstream_Governance.md#direct-import-provenance) |

증거가 부족한 관계는 `unknown` 차단 상태로 두며, 해소 전에는 반입하거나 릴리스하지 않는다.

현재 활성 `vendored` 관계는 없다. `humanize-korean`, `frontend-design`, `custom-skill-design`, `ui-ux-pro-max`, `motion-design`의 원본 관계는 `adapted`이며, 별도의 공식·유명 출처를 `reference`로 함께 추적할 수 있다.

### 14-1. 하나의 upstream을 두 관계로 추적하기

같은 저장소를 직접 반입과 참고로 동시에 쓸 수 있다. `ui-ux-pro-max`와 `motion-design`이 이 구조다.

| 관계 | 모드 | 대상 | 패키징 |
|---|---|---|---|
| `{source}-runtime` | `adapted` | 신규 독립 스킬 | 포함 |
| `{source}-principles` | `reference` | 기존 디자인·검증 스킬 | 미포함 |

두 관계는 `relationship_group`으로 묶인다. 그룹 안에서는 저장소 URL, `source_url`, `license_spdx`, `lifecycle`, observed·accepted SHA가 모두 일치해야 한다. 한쪽만 새 SHA로 승격하거나 한쪽만 `active`로 바꾸면 검증이 실패한다. `reference` 관계가 packaged notice를 주장하거나 file-map에 `reference-only`가 아닌 treatment를 쓰면 역시 실패한다.

참고 관계는 파일을 복사하지 않으므로 `licenses/` 패키징 대상이 아니다. 외부 문장·표·체크리스트·코드를 복사해야 한다고 판단되면 그 파일은 `reference`가 아니라 `adapted` 재분류 대상이다.

upstream 최상위 라이선스는 upstream 저작자가 보유하지 않은 제3자 권리까지 허가하지 못한다. 외부 가이드라인 값이나 표를 인용한 파일은 원 저작자와 이용 조건을 파일 단위로 판정해 provenance NOTICE에 기록한다.

### 14-2. 별도 설치 대상

다음은 이 플러그인에 포함하지 않는다. 필수 의존성이 아니며 사용자가 필요할 때 원본 안내에 따라 직접 설치한다.

| 프로젝트 | 성격 | 포함하지 않는 이유 |
|---|---|---|
| [Caveman](https://github.com/JuliusBrussee/caveman) | 응답 표현·토큰 사용 방식 변경 | 하네스의 설계·검증 계약과 목적이 다르다 |
| [Ruflo](https://github.com/ruvnet/ruflo) | 다중 에이전트·메모리·MCP·hook 메타 하네스 | 일부만 복제하면 원본 이점은 사라지고 유지보수 부담만 남는다 |

설치 명령은 바뀌므로 이 문서에 복제하지 않는다. 최신 설치 방법은 각 원본 저장소의 안내를 따른다.

공통 최신화 흐름:

```text
inventory
→ discover·check (읽기 전용)
→ analyze
→ propose
→ 일반 승인
→ 격리된 maintainer/upstreams/staging/{candidate_id}/에 stage
→ 보호 자산 추가·수정·보완 승인
→ 파괴적 변경이 있으면 별도 destructive 승인
→ validate
→ candidate 한 건씩 promote
→ machine-readable promotion handoff
→ 영향받는 정본·registry·lock·provenance·문서 갱신
→ harness-plugin-maintainer build·skill eval·release regression
```

같은 최신화 workflow를 사용해도 `reference`는 원문과 동일 동작을 보장하지 않는다. `adapted`도 번역·수정된 로컬 목적을 함께 검증해야 하며, `vendored`만 원문 파일·runtime 재현성 검증 대상이다. 어느 mode도 검증하지 않은 upstream 전체 runtime 동등성을 자동 주장하지 않는다. 검증한 범위와 미검증 범위를 분리해 기록한다.

`template.md`, `templates/`, `script/`, `scripts/`, `asset/`, `assets/`, `example/`, `examples/`, `evals/`는 보호 자산이다. 내용 보완과 삭제·이동·교체를 같은 변경으로 취급하지 않는다. 파괴적 변경은 별도 승인 항목으로 분리한다.

## 15. 플러그인 build와 release gate

관리자 흐름:

```text
skills/ 사용자 정본 수정
→ inventory·upstream·provenance 동반 갱신
→ harness-plugin-maintainer build
→ source/runtime/archive validate
→ 격리된 Codex·Claude CLI 설치 smoke
→ Codex·Claude CLI·앱 실제 모델 수동 증적
→ release checklist
→ 별도 승인 후 tag/push/release
```

자동 검증 대상:

- 사용자 source와 양 runtime의 스킬 이름 집합 일치 (capability inventory 파생)
- 양 runtime agents 0, 관리자 스킬 0
- 공식 manifest와 marketplace catalog
- 결정적 archive와 checksum
- frontmatter·경로·금지 패턴
- Markdown producer handoff 계약
- setup output allowlist와 local skill 미생성
- upstream registry·lock·provenance
- 격리된 CLI marketplace add/install/list/cache 확인/remove smoke

수동 증적 대상:

- Codex CLI에서 `$harness-setup` 명시 호출
- Codex 앱에서 `$harness-setup` 명시 호출
- Claude Code CLI에서 `/harness-kit:harness-setup` 명시 호출
- Claude 앱에서 같은 namespaced 호출
- 실제 fixture 산출물과 금지 경로 확인
- 재시작·새 session discovery
- 같은 fingerprint에 대한 문서 개선 중복 제안 방지

설치 smoke는 실제 모델 호출 성공을 뜻하지 않는다. 수동 증적이 부족하면 `not-release-ready`다.

## 16. 프로젝트 내부 사용자 스킬 복사본 처리

프로젝트에서는 설치된 플러그인의 사용자 스킬만 사용한다. `.agents/skills`, `.claude/skills`, `skills/*/SKILL.md`에 사용자 스킬 복사본이 있어도 자동 삭제하지 않는다.

```text
read-only inventory
→ plugin skill copy / user-modified copy / project custom skill 분류
→ 보호 자산과 사용자 수정 확인
→ backup·rollback 경로 확인
→ 사용자 승인
→ 승인된 항목만 backup/remove
→ plugin 단일 discovery 확인
→ 문제 시 rollback
```

이 처리는 사용자 프로젝트의 데이터와 custom skill을 다루므로, 관리자 정본 정리와 같은 자동화로 묶지 않는다.

## 17. 관리자 검증 명령

```text
python maintainer/skills/harness-plugin-maintainer/evals/run_evals.py
python maintainer/skills/harness-plugin-maintainer/scripts/run_all_skill_evals.py
python maintainer/skills/harness-plugin-maintainer/scripts/build_plugin.py --check
python maintainer/skills/harness-plugin-maintainer/scripts/validate_plugin.py
python maintainer/skills/harness-plugin-maintainer/scripts/smoke_cli_install.py
python maintainer/skills/harness-plugin-maintainer/scripts/verify_install_surfaces.py --check
python maintainer/skills/harness-plugin-maintainer/scripts/freeze_manager_inventory.py --check
python maintainer/skills/harness-plugin-maintainer/scripts/run_release_regression.py
python skills/harness-setup/evals/run_evals.py
python maintainer/skills/harness-plugin-maintainer/scripts/sync_manager_projections.py --check
python maintainer/skills/skill-portfolio-maintainer/scripts/validate_registry.py
```

`verify_install_surfaces.py`의 기본 모드는 증적 파일을 갱신한다. 일반 검증과 CI에서는 `--check`를 사용하고, 실제 수동 증적을 검토해 갱신할 때만 기본 모드를 명시적으로 실행한다.

검증 결과는 자동 PASS, 수동 확인, 미검증을 구분한다. 공식 패키지 설치 성공, cache에 선언된 수의 스킬이 존재함, 실제 모델이 산출물 계약을 지킴은 서로 다른 증적이다.

## 18. 관리자 체크리스트

### 사용자 스킬 변경

- [ ] `skills/{skill}/` 정본만 편집했다.
- [ ] frontmatter에 특정 모델이나 agent fork를 하드코딩하지 않았다.
- [ ] 공개 skill-name handoff가 내부 상대경로에 결합되지 않았다.
- [ ] Markdown producer라면 owner·suppress·ledger 계약을 지킨다.
- [ ] 템플릿·스크립트·예시·eval 보호 자산 영향을 분리했다.
- [ ] 관련 사용자 문서와 예제를 갱신했다.

### upstream 반영

- [ ] 공식 source와 ref를 확인했다.
- [ ] `native`/`reference`/`adapted`/`vendored` mode를 정확히 분류했다.
- [ ] 현재 구현과 차이를 의미 단위로 검토했다.
- [ ] 적용하지 않은 항목과 이유를 남겼다.
- [ ] registry, lock, provenance, 문서가 일치한다.
- [ ] 원본과 동일 동작을 검증하지 않고 주장하지 않았다.

### 릴리스 후보

- [ ] build가 clean source에서 재현된다.
- [ ] source와 Codex·Claude runtime inventory가 일치한다.
- [ ] 관리자 스킬과 agents가 사용자 payload에 없다.
- [x] `0.6.0` CLI 설치 smoke가 격리 설정에서 통과한다.
- [ ] 네 인터페이스의 수동 호출 증적이 있다.
- [ ] release checklist의 미검증 항목이 없다.

---

## Portable routing lifecycle

`harness-setup`은 `.ai-docs/harness/`에 프로젝트 상대경로 기반 경로·형식 계약을 남긴다. 공유 manifest의 `project_root`는 `.`이며 사용자 홈·checkout 절대경로와 host 상태를 넣지 않는다. PC별 설치·신뢰·config hash는 Git에서 제외되는 `.ai-docs/.harness/routing-state.local.json`에 둔다. `-Plan`/`-Check`은 읽기 전용이며, Claude/Codex host-local hook의 `-Apply`/`-Uninstall`은 host별 diff와 별도 승인 뒤에만 수행한다. Codex hook은 `/hooks` 신뢰 증적 전까지 로컬 상태를 `pending-trust`로 기록한다.
따라서 이후 다른 플러그인이나 일반 AI 도구를 사용해도 bundle과 앱별 routing instruction만으로 산출물 위치를 해석할 수 있다.

G10 뒤 선택 host에 설치하는 `PreToolUse` adapter는 공통 write guard를 호출한다. guard는 경로를 project containment 기준으로 정규화하고, 기존 canonical 문서·승인된 앱 source·`.ai-docs/_inbox/**`·manifest exception만 통과시킨다. 새 관리 문서는 target path, operation, content SHA-256, TTL을 함께 묶은 1회성 approval marker가 정확히 일치할 때만 통과하며 성공 뒤 marker를 소비한다.
Codex는 deny JSON을, Claude는 exit 2/stderr를 사용하며 두 host 모두 allow는 빈 stdout이다. Codex matcher는 `apply_patch|Bash`만 대상으로 하고, allow는 빈 stdout, bypass는 `systemMessage`, adapter/core 예외는 deny JSON(exit 0)으로 응답해 내부 판정 객체를 Codex에 노출하지 않는다.

이는 관찰 가능한 local write surface의 best-effort guard다. 동적 shell target, hosted tool, opt-out path, 명령 실행 후의 redirect, 외부 process는 완전 차단을 주장하지 않고 bypass evidence로 남긴다. 실제 Codex `/hooks` trust는 여전히 별도의 사용자 증적이다.

사용자가 Codex `/hooks` 또는 해당 host의 신뢰 검토를 마친 뒤에는 `install-routing.ps1 -ActivateTrust -TargetHost codex -ApproveTrustEvidence`처럼 증적을 명시해 로컬 상태만 `active`로 갱신한다. 이 명령은 신뢰 검토를 실행하거나 자동으로 증명하지 않는다. 로컬 상태는 hook 실행 스위치가 아니므로 `/hooks` 신뢰나 `--dangerously-bypass-hook-trust`로 hook이 먼저 실행될 수 있으며, hook 정의가 바뀐 뒤 `-Apply`하면 다시 `pending-trust`가 된다.
외부 Markdown 계열은 `normalize-artifact.ps1 -Plan`으로 UTF-8·managed marker 병합안을 보고 G12 승인 뒤에만 promotion한다. JSON/YAML·이미지·PDF는 source basename·hash와 proposal만 `_inbox`에 보관하고 원본 PC 절대경로, 손실 가능 자동 변환이나 canonical promotion은 남기지 않는다.

## 결론

사용자 관점의 하네스는 **설치 → 문서 골격 → 설계·컨텍스트**를 기반 흐름으로 두고,
그 이후에는 프로젝트에 맞는 도구로 **구현 계획 → 재사용 점검 → 작은 단위 구현·검증 →
리뷰·문서 감사 → 커밋**의 산출물 계약을 이어 가는 방식이다.

관리자 관점의 하네스는 **사용자 스킬 정본 → 외부 근거와 보호 자산 관리 → 양 플랫폼 plugin build → 자동·수동 증적 → release gate**의 흐름이다.

두 흐름을 분리해야 사용자는 프로젝트 결과에 집중하고, 관리자는 여러 플랫폼에서 같은 작업 기준이 재현되도록 하네스를 발전시킬 수 있다.
