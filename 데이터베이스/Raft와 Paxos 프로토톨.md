#### **분산 합의 알고리즘: Raft 프로토콜**

***

#### 답안 전체 스토리 흐름 (목차)

```
Ⅰ. 개요 (왜 "Paxos"로는 부족한가) — 3~4줄
Ⅱ. Raft 3대 핵심 메커니즘 (본론①, 도식 1개 필수)
Ⅲ. Paxos와의 비교·Raft 동작 단계별 흐름 (핵심 배점)
Ⅳ. 결론
```

포인트: 개요에서 \*\*"앞서 다룬 BASE의 결과적 일관성이 '언젠가 맞춰진다'는 느슨한 수렴이라면, Raft는 '분산 클러스터 안에서 단 하나의 리더가 로그 순서를 독점 결정하고 과반 복제를 확인해야만 커밋'하는 강한 합의(Strong Consensus) 프로토콜이다 — Paxos가 수학적으로 완벽하지만 '이해하기 너무 어렵다'는 실무 한계를 Diego Ongaro가 2014년 '이해 가능하도록 설계된 합의 알고리즘(In Search of an Understandable Consensus Algorithm)'으로 극복한 것이 Raft이며, etcd·Consul·CockroachDB·TiKV가 Raft 위에서 동작"\*\*이라는 한 줄로 시작하면, 왜 이 답안이 앞서 다룬 2PC·BASE·CAP 시리즈 전체의 **강한 합의 구현 수단**인지 드러납니다.

***

#### Ⅱ. Raft 3대 핵심 메커니즘

| 메커니즘                        | 내용                                                                                                                                                                                                                          |
| :-------------------------- | :-------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------------- |
| **리더 선출 (Leader Election)** | 클러스터는 항상 **리더(Leader) 1개·팔로워(Follower) N개·후보(Candidate) 0개** 상태 유지. 팔로워가 **Election Timeout(150\~300ms)** 내 리더 하트비트를 수신하지 못하면 Candidate로 전환 → **Term(임기) 번호를 1 증가**시켜 투표 요청(RequestVote) 브로드캐스트 → **과반(N/2+1) 득표** 시 리더로 승격 |
| **로그 복제 (Log Replication)** | 리더만이 클라이언트 요청을 수신해 **로그 엔트리(Log Entry)를 자신의 로그에 추가**. AppendEntries RPC로 **모든 팔로워에게 복제** 요청 → **과반 팔로워가 ACK 응답** 시 해당 엔트리를 **커밋(Commit)** → 상태 머신(State Machine)에 적용 후 클라이언트에 응답. 과반 미달 시 커밋하지 않고 대기                        |
| **안전성 보장 (Safety)**         | **로그 매칭 속성(Log Matching Property)**: 두 노드의 로그에서 동일 인덱스·Term의 엔트리는 **동일한 명령**을 포함하고, 그 이전 모든 엔트리도 동일. **리더 완전성(Leader Completeness)**: 커밋된 엔트리는 **이후 모든 Term의 리더 로그에 반드시 존재** — 투표 시 더 최신 로그를 가진 후보에게만 투표함으로써 보장             |

→ 암기: **"리더 1명이 독점 수신하고, 과반에 복제해야 커밋하고, 새 리더는 반드시 가장 최신 로그를 가진 놈이 된다 — 이 세 규칙이 Raft가 절대 데이터를 잃지 않는 이유"** — 앞서 다룬 \*\*"2PC의 블로킹 문제"\*\*에서 조정자 장애 시 전체가 멈췄다면, Raft는 리더 장애 시 **Election Timeout 안에 새 리더가 자동 선출**되어 서비스가 지속됩니다.

#### 도식화 제안

```
[Raft 클러스터 정상 동작 흐름]

클라이언트
    ↓ 요청(Write x=1)
  리더(Leader, Term=3)
    ├─ 로그에 엔트리 추가: [Term3, x=1]
    ├─ AppendEntries RPC ──→ 팔로워A → ACK ✅
    ├─ AppendEntries RPC ──→ 팔로워B → ACK ✅
    └─ AppendEntries RPC ──→ 팔로워C → (네트워크 지연) ⏳
         ↓
  과반(3/5) ACK 수신 → 커밋 확정
  상태 머신 적용 → 클라이언트 응답 ✅
  (팔로워C는 다음 AppendEntries에서 따라잡기)

[리더 장애 시 선출 흐름]
리더 장애 🚨 → 팔로워들 Election Timeout 초과
    → 팔로워B: Term=4, RequestVote 브로드캐스트
    → 팔로워A·C: 최신 로그 확인 후 투표 ✅
    → 팔로워B: 과반 득표 → 새 리더 승격 ✅
    → 서비스 재개 (전체 소요: 150~300ms)
```

***

#### Ⅲ. Paxos와의 비교·Raft 동작 단계별 흐름 — 핵심 배점

**함정 방지: "Raft는 Paxos보다 이해하기 쉽다"고만 답하면 절반. Term·인덱스 기반 로그 매칭이 실제로 어떻게 분기(Split Brain)를 방지하는지, 네트워크 분단(Partition) 시 Raft가 어떻게 CAP의 CP를 선택하는지를 단계별로 보여줘야 완성됩니다.**

| 단계           | 활동                                                                                                                                             |
| :----------- | :--------------------------------------------------------------------------------------------------------------------------------------------- |
| **정상 운영**    | 리더가 \*\*HeartBeat(빈 AppendEntries RPC)\*\*를 주기적으로 브로드캐스트 → 팔로워들의 Election Timeout 리셋 → 불필요한 선출 방지. 클라이언트 쓰기는 **리더에게만** 전달 (팔로워 수신 시 리더로 리다이렉트) |
| **로그 충돌 복구** | 새 리더 선출 후 팔로워 로그가 리더와 불일치 시 → **nextIndex를 역방향으로 탐색**해 불일치 시작점 발견 → 리더 로그로 팔로워 로그를 **강제 덮어쓰기(Override)** → 로그 매칭 속성 복원                         |
| **네트워크 분단**  | 앞서 다룬 **"CAP의 CP 선택"** — 분단 발생 시 **과반 노드가 없는 파티션은 리더 선출·커밋 불가** → 서비스 중단(가용성 포기). 과반 파티션만 정상 동작 → **분기(Split Brain) 원천 차단**                    |
| **멤버십 변경**   | 클러스터 노드 추가·제거 시 **Joint Consensus(공동 합의)** 사용. 구성 변경 중 두 개의 과반(Old·New 설정 각각)이 동시에 필요 → 단 하나의 리더만 존재하는 안전성 유지                                  |
| **선출 제한**    | 투표 요청(RequestVote) 수신 시 요청자의 **마지막 로그 Term·인덱스가 자신보다 최신이어야만** 투표 허용 → 커밋된 엔트리를 모르는 후보가 리더가 되는 것을 원천 차단 → 리더 완전성 보장                             |

→ 암기: **"하트비트로 선출을 막고, 과반 ACK로 커밋하고, 분단 시 소수 파티션은 멈추고, 새 리더는 로그가 가장 최신인 놈만 되고, 충돌 로그는 리더가 강제로 덮어쓴다"**

**Split Brain 방지 구조** (중요): 앞서 다룬 \*\*"BASE의 Quorum Write(N개 중 W개)"\*\*가 유연하게 과반을 조절했다면, Raft는 **과반(N/2+1)을 절대 기준**으로 고정해 네트워크 분단 시 두 파티션이 각각 리더를 선출하는 Split Brain을 수학적으로 불가능하게 만든다 — 5노드 클러스터가 3·2로 분단되면 **3노드 파티션만 과반을 충족해 리더 유지**, 2노드 파티션은 **영원히 후보 상태**에 머물며 커밋 불가. 이는 앞서 다룬 \*\*"CAP 정리에서 CP를 선택한 대가로 가용성을 포기"\*\*하는 구조적 결정입니다.

#### 도식화 제안

```
[Paxos vs Raft 전면 비교]

항목              Paxos                    Raft
────────────────────────────────────────────────────
설계 목표         수학적 완전성              이해 가능성·실용성
역할 구분         Proposer·Acceptor·Learner  Leader·Follower·Candidate
리더십            멀티 Proposer 가능         단일 리더 강제
로그 순서         복잡한 Phase1·Phase2       리더 로그가 단일 진실
구현 복잡도       매우 높음 🚨               상대적 낮음 ✅
멤버십 변경       별도 프로토콜 필요          Joint Consensus 내장
대표 구현체       Chubby(Google)             etcd·Consul·TiKV·CockroachDB

[Raft CAP 위치]
       C(일관성) ✅  ← 과반 커밋·로그 매칭으로 강한 일관성
      /
     CP  ← Raft 선택
      \
       P(분단 허용) ✅ ← 과반 파티션만 동작
        A(가용성) ❌  ← 소수 파티션 서비스 중단
```

**앞서 다룬 2PC·BASE·CAP·etcd와의 연결**: 이런 **"Term 기반 리더 선출·AppendEntries 과반 복제·로그 매칭 속성"** 구조가 실제로는 앞서 다룬 \*\*"쿠버네티스(Kubernetes)의 etcd"\*\*가 클러스터 상태(Pod·Service·ConfigMap)를 저장하는 분산 KV 저장소로 Raft를 사용해 단 하나의 진실(Single Source of Truth)을 보장하고, 앞서 다룬 \*\*"CXL 메모리 풀링의 분산 메모리 관리"\*\*에서 노드 간 메모리 상태 합의에 Raft 계열 프로토콜이 활용되는 전 과정을 직접 연결합니다.

***

#### Ⅳ. 결론

Raft 프로토콜은 \*\*"단일 리더가 로그 순서를 독점 결정하고, AppendEntries RPC로 팔로워에 복제해 과반 ACK 확인 후 커밋하며, Election Timeout·Term 번호·로그 최신성 투표 제한으로 Split Brain을 수학적으로 차단하는 강한 합의 알고리즘"\*\*이며, 특히 \*\*"Paxos의 수학적 완전성을 유지하면서 단일 리더·순차 로그·명시적 Term이라는 세 단순화로 이해 가능성과 구현 가능성을 동시에 달성하고, 네트워크 분단 시 CAP의 CP를 선택해 가용성보다 일관성을 우선"\*\*하는 것이 핵심입니다 — 이는 앞서 다룬 \*\*2PC(블로킹 합의) → CAP 정리(한계 증명) → BASE(약한 일관성·AP) → Raft(강한 합의·CP) → etcd·쿠버네티스(실무 적용)\*\*를 하나로 잇는 분산 합의의 실무적 교량이며, \*\*"분산 시스템에서 단 하나의 진실이 필요할 때, 결국 과반이 동의한 리더의 로그만이 진실이며 그것을 구현한 것이 Raft"\*\*라는 결론으로 이어집니다.

### **I. 분산 데이터 동기화의 표준, Raft 프로토콜의 개요**

기존 분산 합의 알고리즘의 표준인 팍소스(Paxos)는 지나치게 난해하여 실제 구현 및 예외 처리에 많은 오버헤드가 존재했습니다. **Raft**는 팍소스와 동등한 성능 및 내결함성을 제공하면서도, 아키텍처를 **리더 선출(Leader Election), 로그 복제(Log Replication), 안전성(Safety)** 3가지 컴포넌트로 완벽히 분할하여 직관성과 구현성을 극대화한 강력한 단일 리더 기반 합의 알고리즘입니다.

```
```

![Mermaid diagram](data:image/svg+xml;base64,<svg xmlns="http://www.w3.org/2000/svg" viewBox="0 0 758.5999999999999 375.3" width="758.5999999999999" height="375.3" style="--bg:#FFFFFF;--fg:#3B3B3B;--line:#3B3B3B;--accent:#005FB8;--muted:#3B3B3BCC;--surface:#F8F8F8;--border:#3B3B3B;background:var(--bg)">
<style>
  @import url('https://fonts.googleapis.com/css2?family=Inter:wght@400;500;600;700&amp;display=swap');
  text { font-family: 'Inter', system-ui, sans-serif; }
  svg {
    /* Derived from --bg and --fg (overridable via --line, --accent, etc.) */
    --_text:          var(--fg);
    --_text-sec:      var(--muted, color-mix(in srgb, var(--fg) 60%, var(--bg)));
    --_text-muted:    var(--muted, color-mix(in srgb, var(--fg) 40%, var(--bg)));
    --_text-faint:    color-mix(in srgb, var(--fg) 25%, var(--bg));
    --_line:          var(--line, color-mix(in srgb, var(--fg) 50%, var(--bg)));
    --_arrow:         var(--accent, color-mix(in srgb, var(--fg) 85%, var(--bg)));
    --_node-fill:     var(--surface, color-mix(in srgb, var(--fg) 3%, var(--bg)));
    --_node-stroke:   var(--border, color-mix(in srgb, var(--fg) 20%, var(--bg)));
    --_group-fill:    var(--bg);
    --_group-hdr:     color-mix(in srgb, var(--fg) 5%, var(--bg));
    --_inner-stroke:  color-mix(in srgb, var(--fg) 12%, var(--bg));
    --_key-badge:     color-mix(in srgb, var(--fg) 10%, var(--bg));
  }
</style>
<defs>
  <marker id="arrowhead" markerWidth="8" markerHeight="5" refX="7" refY="2.5" orient="auto">
    <polygon points="0 0, 8 2.5, 0 5" fill="var(--_arrow)" stroke="var(--_arrow)" stroke-width="0.75" stroke-linejoin="round" />
  </marker>
  <marker id="arrowhead-start" markerWidth="8" markerHeight="5" refX="1" refY="2.5" orient="auto-start-reverse">
    <polygon points="8 0, 0 2.5, 8 5" fill="var(--_arrow)" stroke="var(--_arrow)" stroke-width="0.75" stroke-linejoin="round" />
  </marker>
</defs>
<polyline class="edge" data-from="Follower" data-to="Candidate" data-style="solid" data-arrow-start="false" data-arrow-end="true" data-label="하트비트 타임아웃 시" points="565.0068749999999,298.40000000000003 565.0068749999999,286.40000000000003 658.9659999999999,286.40000000000003 658.9659999999999,218.10000000000002 574.1767499999999,218.10000000000002 574.1767499999999,76.9" fill="none" stroke="var(--_line)" stroke-width="1" marker-end="url(#arrowhead)" />
<polyline class="edge" data-from="Candidate" data-to="Leader" data-style="solid" data-arrow-start="false" data-arrow-end="true" data-label="과반수 득표 성공" points="425.37924999999996,76.9 425.37924999999996,88.9 212.13899999999998,88.9 212.13899999999998,169.2" fill="none" stroke="var(--_line)" stroke-width="1" marker-end="url(#arrowhead)" />
<polyline class="edge" data-from="Leader" data-to="Follower" data-style="solid" data-arrow-start="false" data-arrow-end="true" data-label="장애 발생/상대 노드 용어 갱신 시" points="212.13899999999998,206.10000000000002 212.13899999999998,286.40000000000003 428.435875,286.40000000000003 428.435875,298.40000000000003" fill="none" stroke="var(--_line)" stroke-width="1" marker-end="url(#arrowhead)" />
<polyline class="edge" data-from="Candidate" data-to="Follower" data-style="solid" data-arrow-start="false" data-arrow-end="true" data-label="선출 실패/타 리더 하트비트 감지" points="499.7779999999999,76.9 499.7779999999999,286.40000000000003 496.72137499999997,286.40000000000003 496.72137499999997,298.40000000000003" fill="none" stroke="var(--_line)" stroke-width="1" marker-end="url(#arrowhead)" />
<g class="edge-label" data-from="Follower" data-to="Candidate" data-label="하트비트 타임아웃 시">
  <rect x="594.4659999999999" y="225.10000000000002" width="128.13400000000001" height="30.3" rx="2" ry="2" fill="var(--bg)" stroke="var(--_inner-stroke)" stroke-width="1" />
  <text x="658.5329999999999" y="240.25000000000003" text-anchor="middle" font-size="11" font-weight="400" fill="var(--_text-sec)" dy="3.8499999999999996">하트비트 타임아웃 시</text>
</g>
<g class="edge-label" data-from="Candidate" data-to="Leader" data-label="과반수 득표 성공">
  <rect x="159.639" y="95.9" width="104.37400000000002" height="30.3" rx="2" ry="2" fill="var(--bg)" stroke="var(--_inner-stroke)" stroke-width="1" />
  <text x="211.82600000000002" y="111.05000000000001" text-anchor="middle" font-size="11" font-weight="400" fill="var(--_text-sec)" dy="3.8499999999999996">과반수 득표 성공</text>
</g>
<g class="edge-label" data-from="Leader" data-to="Follower" data-label="장애 발생/상대 노드 용어 갱신 시">
  <rect x="120.139" y="249.1" width="183.97000000000006" height="30.3" rx="2" ry="2" fill="var(--bg)" stroke="var(--_inner-stroke)" stroke-width="1" />
  <text x="212.12400000000002" y="264.25" text-anchor="middle" font-size="11" font-weight="400" fill="var(--_text-sec)" dy="3.8499999999999996">장애 발생/상대 노드 용어 갱신 시</text>
</g>
<g class="edge-label" data-from="Candidate" data-to="Follower" data-label="선출 실패/타 리더 하트비트 감지">
  <rect x="408.2779999999999" y="225.10000000000002" width="182.18800000000005" height="30.3" rx="2" ry="2" fill="var(--bg)" stroke="var(--_inner-stroke)" stroke-width="1" />
  <text x="499.37199999999996" y="240.25000000000003" text-anchor="middle" font-size="11" font-weight="400" fill="var(--_text-sec)" dy="3.8499999999999996">선출 실패/타 리더 하트비트 감지</text>
</g>
<g class="node" data-id="Follower" data-label="Follower : 대기 및 리더 심장박동 감시" data-shape="rectangle">
  <rect x="360.15037499999994" y="298.40000000000003" width="273.142" height="36.900000000000006" rx="0" ry="0" fill="#ffebee" stroke="#d32f2f" stroke-width="0.75" />
  <text x="496.72137499999997" y="316.85" text-anchor="middle" font-size="13" font-weight="500" fill="var(--_text)" dy="4.55">Follower : 대기 및 리더 심장박동 감시</text>
</g>
<g class="node" data-id="Candidate" data-label="Candidate : 투표 요청 및 과반수 득표 시도" data-shape="rectangle">
  <rect x="350.9804999999999" y="40" width="297.595" height="36.900000000000006" rx="0" ry="0" fill="var(--_node-fill)" stroke="var(--_node-stroke)" stroke-width="0.75" />
  <text x="499.7779999999999" y="58.45" text-anchor="middle" font-size="13" font-weight="500" fill="var(--_text)" dy="4.55">Candidate : 투표 요청 및 과반수 득표 시도</text>
</g>
<g class="node" data-id="Leader" data-label="Leader : 모든 쓰기 트랜잭션 및 로그 동기화 주도" data-shape="rectangle">
  <rect x="40" y="169.2" width="344.27799999999996" height="36.900000000000006" rx="0" ry="0" fill="#e8f5e9" stroke="#388e3c" stroke-width="2px" />
  <text x="212.13899999999998" y="187.64999999999998" text-anchor="middle" font-size="13" font-weight="500" fill="var(--_text)" dy="4.55">Leader : 모든 쓰기 트랜잭션 및 로그 동기화 주도</text>
</g>
</svg> "Mermaid diagram")

***

### **II. Raft 프로토콜의 3대 동작 메커니즘**

#### **1. 리더 선출 (Leader Election)**

* **Term (임기)**: 논리적 시간 단위인 Term을 사용하여 구세대 리더와 신세대 리더를 구분합니다.
* **임의 투표 타임아웃 (Randomized Election Timeout)**: 팔로워가 후보자로 전환되는 대기 시간을 노드마다 무작위(예: 150\~300ms)로 다르게 주어, 표가 갈려 리더가 선출되지 않는 분할 투표(Split Vote)를 방지합니다.

#### **2. 로그 복제 (Log Replication)**

* 리더는 클라이언트의 쓰기 요청을 받아 로컬 로그에 우선 기록하고, 팔로워에게 복제 요청(`RequestVote` 및 `AppendEntries` RPC)을 보냅니다.
* 전체 노드의 과반수(⌊N/2⌋+1⌊*N*/2⌋+1)가 동기화 완료 신호를 보내면 리더는 해당 쓰기 요청을 **Commit(커밋)** 처리하고 최종 응답합니다.

#### **3. 안전성 (Safety)**

* **리더 완전성 (Leader Completeness)**: 반드시 최신 커밋 로그를 모두 보유한 노드만 새 리더로 선출될 수 있게 제한함으로써 데이터 누실을 원천 차단합니다.

***

### **III. 고전 팍소스(Paxos) 프로토콜과 현대 라프트(Raft) 프로토콜의 비교**

| **비교 항목**      | **🏛️ 팍소스 (Paxos) 프로토콜**              | **⛵ 라프트 (Raft) 프로토콜**                              |
| :------------- | :------------------------------------ | :------------------------------------------------- |
| **디자인 핵심 철학**  | 수리적 정합성 및 엄밀한 논리 증명 지향                | **이해 가능성(Understandability) 및 구현 직관성 지향**          |
| **리더 아키텍처**    | 대칭 구조 (Proposer 간 임시 리더 지정, 리더 부재 허용) | **비대칭 구조 (강력한 단일 리더 기반 통제)**                       |
| **알고리즘 구성**    | Single-Paxos와 Multi-Paxos의 복잡한 조합     | **선출, 복제, 안전성의 3가지 독립 서브 컴포넌트 구성**                 |
| **실제 오픈소스 적용** | 직접 구현이 어려워 Chubby 등 한정적 적용            | **etcd(Kubernetes), Consul, CockroachDB 등 광범위 적용** |

***

### **IV. Raft 적용 분산 환경의 스플릿 브레인(Split-Brain) 방어 전략**

**IMPORTANT**

1. **과반수 쿼럼(Majority Quorum) 합의**: 네트워크 파티션 발생으로 클러스터가 2개로 쪼개질 때(예: 5개 노드가 2개와 3개로 분할), 과반수를 확보하지 못한 2개 쪽 파티션은 리더 선출 및 커밋 처리가 불가하도록 차단하여 데이터 불일치(Split-Brain)를 방어합니다.
2. **조인트 컨센서스(Joint Consensus)를 통한 설정 변경**: 노드를 추가/제거하여 클러스터 구조가 변경될 때, 구설정 정족수와 신설정 정족수가 일시적으로 겹치지 않도록 이단계 설정 변경(Joint Consensus) 프로토콜을 가동하여 일시적 이중 리더 생성을 원천 무효화해야 합니다.
