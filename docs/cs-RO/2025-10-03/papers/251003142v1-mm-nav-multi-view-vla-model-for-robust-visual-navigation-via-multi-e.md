---
layout: default
title: MM-Nav: Multi-View VLA Model for Robust Visual Navigation via Multi-Expert Learning
---

# MM-Nav: Multi-View VLA Model for Robust Visual Navigation via Multi-Expert Learning

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2510.03142" target="_blank" class="toolbar-btn">arXiv: 2510.03142v1</a>
    <a href="https://arxiv.org/pdf/2510.03142.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.03142v1" 
            onclick="toggleFavorite(this, '2510.03142v1', 'MM-Nav: Multi-View VLA Model for Robust Visual Navigation via Multi-Expert Learning')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Tianyu Xu, Jiawei Chen, Jiazhao Zhang, Wenyao Zhang, Zekun Qi, Minghan Li, Zhizheng Zhang, He Wang

**分类**: cs.RO, cs.CV

**发布日期**: 2025-10-03

**备注**: Project page: https://pku-epic.github.io/MM-Nav-Web/

---

## 💡 一句话要点

**提出MM-Nav：一种基于多视角VLA模型和多专家学习的鲁棒视觉导航方法**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱六：视频提取与匹配 (Video Extraction)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视觉导航` `多视角学习` `视觉-语言-动作模型` `多专家学习` `强化学习` `模仿学习` `机器人`

## 📋 核心要点

1. 现有视觉导航方法难以有效建模视觉信息，依赖大量数据和智能模型。
2. 提出MM-Nav，利用多视角VLA模型和多专家学习，从合成数据中学习多样导航能力。
3. 实验表明，MM-Nav在合成和真实环境中均表现出强大的泛化能力，并超越了RL教师。

## 📝 摘要（中文）

视觉导航策略通过模仿人类利用自我中心的视觉观察进行导航，被广泛认为是很有前景的方向。然而，视觉观察的光学信息难以像激光雷达点云或深度图那样被显式建模，这需要智能模型和大规模数据。为此，我们提出利用视觉-语言-动作（VLA）模型的智能，以teacher-student的方式从合成专家数据中学习多样化的导航能力。具体来说，我们基于预训练的大型语言模型和视觉基础模型，将VLA模型MM-Nav实现为一个多视角VLA（具有360度观察）。对于大规模导航数据，我们从三个强化学习（RL）专家收集专家数据，这些专家在三个具有挑战性的定制环境中接受了具有特权的深度信息训练，以实现不同的导航能力：到达、挤压和避障。我们使用从RL专家在线收集的数据迭代地训练我们的VLA模型，其中训练比例基于各个能力的性能进行动态平衡。通过在合成环境中进行的大量实验，我们证明了我们的模型实现了强大的泛化能力。此外，我们发现我们的学生VLA模型优于RL教师，证明了整合多种能力的协同效应。大量的真实世界实验进一步证实了我们方法的有效性。

## 🔬 方法详解

**问题定义**：视觉导航任务旨在使智能体仅通过视觉输入自主导航到目标位置。现有方法难以有效建模视觉信息，并且需要大量真实世界数据进行训练，泛化能力有限。此外，不同导航场景需要不同的导航策略，单一模型难以适应所有场景。

**核心思路**：利用预训练的视觉-语言-动作（VLA）模型，通过模仿学习的方式，从多个强化学习（RL）专家中学习不同的导航能力。通过多专家学习，使模型能够根据不同的场景选择合适的导航策略，从而提高泛化能力和鲁棒性。

**技术框架**：MM-Nav采用多视角VLA架构，使用360度全景视觉输入。整体流程包括：1) 使用三个RL专家（分别针对到达、挤压和避障任务）生成训练数据；2) 使用这些数据训练VLA模型；3) 在训练过程中，动态调整不同专家数据的训练比例，以平衡不同能力的学习；4) 在真实环境中进行测试，验证模型的泛化能力。

**关键创新**：1) 提出多视角VLA模型，能够有效利用全景视觉信息进行导航；2) 采用多专家学习策略，使模型能够学习到多样化的导航能力；3) 动态调整训练比例，平衡不同能力的学习，提高模型的整体性能。

**关键设计**：1) 使用预训练的大型语言模型和视觉基础模型作为VLA模型的基础；2) 三个RL专家分别使用不同的奖励函数和环境设置，以训练不同的导航能力；3) 动态训练比例的调整基于VLA模型在各个任务上的表现，使用简单的比例调整策略。

## 📊 实验亮点

MM-Nav在合成环境中表现出强大的泛化能力，并且超越了作为教师的RL专家，证明了多专家学习的协同效应。在真实世界实验中，MM-Nav也取得了显著的成果，验证了其在实际应用中的有效性。具体性能数据未知，但论文强调了其优于RL教师。

## 🎯 应用场景

该研究成果可应用于机器人导航、自动驾驶、虚拟现实等领域。例如，可以用于开发能够在复杂环境中自主导航的机器人，或者用于构建更加智能和安全的自动驾驶系统。此外，该方法还可以应用于虚拟现实游戏中，提高游戏角色的智能性和交互性。

## 📄 摘要（原文）

> Visual navigation policy is widely regarded as a promising direction, as it mimics humans by using egocentric visual observations for navigation. However, optical information of visual observations is difficult to be explicitly modeled like LiDAR point clouds or depth maps, which subsequently requires intelligent models and large-scale data. To this end, we propose to leverage the intelligence of the Vision-Language-Action (VLA) model to learn diverse navigation capabilities from synthetic expert data in a teacher-student manner. Specifically, we implement the VLA model, MM-Nav, as a multi-view VLA (with 360 observations) based on pretrained large language models and visual foundation models. For large-scale navigation data, we collect expert data from three reinforcement learning (RL) experts trained with privileged depth information in three challenging tailor-made environments for different navigation capabilities: reaching, squeezing, and avoiding. We iteratively train our VLA model using data collected online from RL experts, where the training ratio is dynamically balanced based on performance on individual capabilities. Through extensive experiments in synthetic environments, we demonstrate that our model achieves strong generalization capability. Moreover, we find that our student VLA model outperforms the RL teachers, demonstrating the synergistic effect of integrating multiple capabilities. Extensive real-world experiments further confirm the effectiveness of our method.

