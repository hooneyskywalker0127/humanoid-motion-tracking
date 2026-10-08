# Reward ablation — Tracking Reward는 각각 무엇을 떠받치는가

[← README](../README.md)

Reward는 [BeyondMimic](https://github.com/HybridRobotics/whole_body_tracking)의 것을 그대로 썼고 한 번도
건드리지 않았습니다. Tracking Reward 여섯 항을 세 묶음으로 나눠 한 묶음씩 가중치를 0으로 두고, 같은 클립을
처음부터 학습해 비교했습니다. 위치와 자세는 같은 대상을 다른 좌표로 재는 짝이라, 하나만 빼면 다른
하나가 대신 끌어 줍니다. 그래서 짝으로 뺐습니다.

| 조건 | 0으로 둔 항 |
|---|---|
| base | 없음 |
| no_anchor | `motion_global_anchor_pos`, `motion_global_anchor_ori` — 골반(Anchor)의 전역 위치·자세 |
| no_body | `motion_body_pos`, `motion_body_ori` — Anchor 기준 몸체 상대 위치·자세 |
| no_vel | `motion_body_lin_vel`, `motion_body_ang_vel` — 몸체의 전역 선속도·각속도 |

`obstacles3_subject3`(131초), 씨드 42, 환경 4096개, PPO 10,000회, 같은 코드입니다. 정규화 항
(행동 변화율, 관절 한계, 원치 않는 접촉)은 그대로 뒀습니다.

## 결과

평가는 100 rollout, Domain Randomization 끔, 프레임 0부터 클립 끝까지입니다.

| 조건 | Success Rate | E_g-mpbpe | E_mpbpe | E_mpjpe | 평균 생존 프레임 (/6554) |
|---|---|---|---|---|---|
| base | 63% | 337mm | 60mm | 0.122 | 4387 |
| no_anchor | **3%** | **1255mm** | 61mm | 0.127 | **369** |
| no_body | **0%** | — | — | — | **91** |
| no_vel | 55% | **956mm** | 60mm | 0.122 | 4419 |

오차는 완주한 rollout만 평균낸 값이라 Success Rate와 같이 읽어야 합니다.

**세 묶음 모두 필요합니다.** 빼면 무너지는 방식이 묶음마다 다릅니다.

- **Anchor 항을 빼면 표류합니다.** 끝까지 간 rollout의 자세 오차(E_mpbpe 61mm)는 base와 같은데, 전역
  위치 오차가 1.25m입니다. 자세는 맞는데 Reference 자리에서 흘러갑니다.
- **몸체 자세 항을 빼면 2초 만에 쓰러집니다.** 팔다리 높이로 판정하는 종료가 먼저 걸립니다
  (학습 중 그 종료 비율 0.42, base 0.18).
- **속도 항을 빼면 완주는 비슷한데 전역 위치가 세 배로 틀어집니다.**

## 예상이 둘 틀렸습니다

**1. Anchor 항을 빼도 Success Rate는 유지될 줄 알았습니다.** 넘어짐 판정이 골반의 수평 위치를 보지 않고
높이만 보기 때문입니다. 실제로는 3%로 무너졌습니다. 학습 중에는 10초 창의 73%를 끝까지 버티는데,
처음부터 131초를 돌리면 평균 7초에 쓰러집니다. 학습(10초, 무작위 시작)과 평가(처음부터 끝까지)의
차이로 보이지만 확인하지는 않았습니다.

**2. 전역 위치를 붙잡는 것은 Anchor 항이라고 생각했습니다.** 학습 중 Anchor 위치 오차는 속도 항을 뺐을 때
(2.10m)가 Anchor 항을 뺐을 때(0.95m)보다 큽니다. 속도 Reward는 월드 좌표계에서 재는 오차라서, 시간에
걸쳐 쌓이면 위치를 잡아 주는 셈입니다. 이 클립에서는 표류를 막는 몫이 Anchor 항보다 속도 항이 큽니다.

| 조건 | 학습 중 에피소드 길이 (/500) | 시간 만료 비율 | Anchor 위치 오차 |
|---|---|---|---|
| base | 408 | 0.80 | 0.28m |
| no_anchor | 376 | 0.73 | 0.95m |
| no_body | 326 | 0.53 | 0.42m |
| no_vel | 392 | 0.76 | **2.10m** |

## 한계

- **base도 덜 수렴했습니다.** 1만 회에서 완주 63%입니다(3만 회 Teacher는 98%, 다만 다른 npz로 학습).
  그래서 이 표는 "다 배운 Policy의 비교"가 아니라 **"같은 1만 회 예산에서 어느 쪽이 더 배웠나"** 입니다.
  수렴한 뒤에도 순위가 같을지는 모릅니다.
- 클립 하나, 씨드 하나입니다.

## 자료

- 학습 곡선: [W&B](https://wandb.ai/hooneyskywalker-humanoid/humanoid-motion-tracking) `reward_ablation_obstacles3` 그룹
- 체크포인트와 평가: [Hugging Face](https://huggingface.co/hooneyskywalker/humanoid-motion-tracking-policies/tree/main/reward_ablation) `reward_ablation/`
