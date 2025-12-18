---
layout: default
title: Learning Human-Humanoid Coordination for Collaborative Object Carrying
---

# Learning Human-Humanoid Coordination for Collaborative Object Carrying

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.14293" class="toolbar-btn" target="_blank">📄 arXiv: 2510.14293v1</a>
  <a href="https://arxiv.org/pdf/2510.14293.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.14293v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2510.14293v1', 'Learning Human-Humanoid Coordination for Collaborative Object Carrying')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yushi Du, Yixuan Li, Baoxiong Jia, Yutang Lin, Pei Zhou, Wei Liang, Yanchao Yang, Siyuan Huang

**分类**: cs.RO, cs.AI, cs.CV, cs.LG

**发布日期**: 2025-10-16

---

## 💡 一句话要点

**提出COLA算法，实现基于本体感觉的人形机器人协同搬运，提升人机协作效率。**

🎯 **匹配领域**: **支柱一：机器人控制 (Robot Control)** **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `人机协作` `人形机器人` `强化学习` `协同搬运` `本体感觉`

## 📋 核心要点

1. 人形机器人全身动力学复杂，现有机器人手臂的顺应性人机协作方法难以直接应用于人形机器人。
2. 提出COLA算法，在单一策略中融合领导者和跟随者行为，通过强化学习实现人机协同搬运。
3. 实验结果表明，COLA算法在模拟和真实环境中均能有效降低人类体力消耗，提升协作效率和鲁棒性。

## 📝 摘要（中文）

本文提出了一种仅使用本体感觉的强化学习方法COLA，用于实现人与人形机器人在协同搬运中的协作。该方法在闭环环境中训练，通过动态物体交互隐式地预测物体运动模式和人类意图，从而实现协同运动，并通过协调的轨迹规划来保持负载平衡。通过模拟和真实世界的实验，验证了该模型在各种地形和物体上的有效性、泛化性和鲁棒性。模拟实验表明，与基线方法相比，该模型可减少人类24.7%的体力消耗，同时保持物体稳定性。真实实验验证了在不同物体类型（箱子、桌子、担架等）和运动模式（直线、转弯、爬坡）下的鲁棒协同搬运。包含23名参与者的人工用户研究证实，与基线模型相比，平均提升了27.4%。该方法无需外部传感器或复杂的交互模型，即可实现协同搬运，为实际部署提供了一种可行的解决方案。

## 🔬 方法详解

**问题定义**：论文旨在解决人形机器人与人类协同搬运物体时，如何实现高效、安全、自然的协作问题。现有方法通常依赖外部传感器（如视觉）或复杂的交互模型，成本高昂且鲁棒性较差。此外，如何让人形机器人理解人类意图并做出相应的动作，也是一个挑战。

**核心思路**：论文的核心思路是利用强化学习，训练一个仅依赖机器人本体感觉的策略，使机器人能够通过与环境的交互，学习到人类的意图和物体的运动模式，从而实现协同搬运。通过将领导者和跟随者行为融合在同一个策略中，机器人可以根据实际情况灵活调整自身角色。

**技术框架**：COLA算法的整体框架是一个闭环强化学习系统。机器人通过本体感觉获取自身状态信息，并将其输入到策略网络中。策略网络输出机器人的动作，作用于环境，产生新的状态和奖励。奖励函数的设计旨在鼓励机器人与人类协同搬运物体，保持物体平衡，并减少人类的体力消耗。通过不断地与环境交互，策略网络逐渐学习到最优策略。

**关键创新**：该论文的关键创新在于提出了一种仅依赖本体感觉的强化学习方法，无需外部传感器即可实现人机协同搬运。此外，将领导者和跟随者行为融合在同一个策略中，使得机器人能够根据实际情况灵活调整自身角色，提高了协作的灵活性和鲁棒性。

**关键设计**：奖励函数的设计是关键。奖励函数包括以下几个部分：物体平衡奖励，鼓励机器人保持物体平衡；人类体力消耗奖励，鼓励机器人减少人类的体力消耗；协同奖励，鼓励机器人与人类协同搬运物体；动作惩罚，防止机器人做出不自然的动作。策略网络采用Actor-Critic结构，Actor网络输出机器人的动作，Critic网络评估当前状态的价值。训练算法采用Trust Region Policy Optimization (TRPO)。

## 📊 实验亮点

模拟实验表明，COLA算法能够减少人类24.7%的体力消耗，同时保持物体稳定性。真实世界实验验证了COLA算法在不同物体类型（箱子、桌子、担架等）和运动模式（直线、转弯、爬坡）下的鲁棒性。用户研究表明，与基线模型相比，COLA算法平均提升了27.4%的用户体验。

## 🎯 应用场景

该研究成果可应用于医疗保健、家庭服务和制造业等领域。例如，在医院中，人形机器人可以与医护人员协同搬运病人或医疗设备；在家庭中，人形机器人可以帮助老年人或残疾人搬运重物；在工厂中，人形机器人可以与工人协同搬运零部件。该研究有望提高人机协作效率，降低劳动强度，改善工作环境。

## 📄 摘要（原文）

> Human-humanoid collaboration shows significant promise for applications in healthcare, domestic assistance, and manufacturing. While compliant robot-human collaboration has been extensively developed for robotic arms, enabling compliant human-humanoid collaboration remains largely unexplored due to humanoids' complex whole-body dynamics. In this paper, we propose a proprioception-only reinforcement learning approach, COLA, that combines leader and follower behaviors within a single policy. The model is trained in a closed-loop environment with dynamic object interactions to predict object motion patterns and human intentions implicitly, enabling compliant collaboration to maintain load balance through coordinated trajectory planning. We evaluate our approach through comprehensive simulator and real-world experiments on collaborative carrying tasks, demonstrating the effectiveness, generalization, and robustness of our model across various terrains and objects. Simulation experiments demonstrate that our model reduces human effort by 24.7%. compared to baseline approaches while maintaining object stability. Real-world experiments validate robust collaborative carrying across different object types (boxes, desks, stretchers, etc.) and movement patterns (straight-line, turning, slope climbing). Human user studies with 23 participants confirm an average improvement of 27.4% compared to baseline models. Our method enables compliant human-humanoid collaborative carrying without requiring external sensors or complex interaction models, offering a practical solution for real-world deployment.

