---
layout: default
title: VER: Vision Expert Transformer for Robot Learning via Foundation Distillation and Dynamic Routing
---

# VER: Vision Expert Transformer for Robot Learning via Foundation Distillation and Dynamic Routing

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.05213" class="toolbar-btn" target="_blank">📄 arXiv: 2510.05213v1</a>
  <a href="https://arxiv.org/pdf/2510.05213.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.05213v1" onclick="toggleFavorite(this, '2510.05213v1', 'VER: Vision Expert Transformer for Robot Learning via Foundation Distillation and Dynamic Routing')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Yixiao Wang, Mingxiao Huo, Zhixuan Liang, Yushi Du, Lingfeng Sun, Haotian Lin, Jinghuan Shang, Chensheng Peng, Mohit Bansal, Mingyu Ding, Masayoshi Tomizuka

**分类**: cs.RO, cs.AI, cs.LG

**发布日期**: 2025-10-06

**🔗 代码/项目**: [PROJECT_PAGE](https://yixiaowang7.github.io/ver_page/)

---

## 💡 一句话要点

**提出VER，通过专家蒸馏和动态路由实现机器人学习的视觉知识迁移。**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)** **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `机器人学习` `视觉基础模型` `知识蒸馏` `动态路由` `Transformer` `专家系统` `参数高效微调`

## 📋 核心要点

1. 现有视觉基础模型在特定领域表现出色，但在跨任务泛化性方面存在局限性，直接蒸馏多个VFM会造成任务特征选择不灵活。
2. VER通过预训练将多个VFM蒸馏成专家库，并使用轻量级路由网络动态选择任务相关的专家，避免了完全重新训练的成本。
3. 实验结果表明，VER在17个机器人任务上取得了SOTA性能，并能有效减少任务无关区域的干扰，聚焦关键区域。

## 📝 摘要（中文）

本文提出了一种用于机器人学习的视觉专家Transformer（VER）。VER通过蒸馏多个视觉基础模型（VFMs）到一个视觉专家库中，从而利用丰富的视觉表征来提升机器人学习。为了适应不同的机器人任务，VER仅需微调一个轻量级的路由网络（参数量小于0.4%），即可从预训练的专家库中动态选择任务相关的专家。此外，本文还引入了带有课程Top-K退火的Patchwise专家路由，以提高动态专家选择的灵活性和精确性。VER还支持参数高效的微调，从而实现专家利用率的可扩展性和自适应的机器人领域知识集成。在17个不同的机器人任务和多个策略头上的实验表明，VER实现了最先进的性能。实验结果表明，VER减少了任务无关区域（例如背景）中的大范数异常值，并集中于任务关键区域。

## 🔬 方法详解

**问题定义**：现有方法在将多个视觉基础模型（VFMs）应用于机器人学习时，存在两个主要问题。一是单个VFM通常只擅长特定领域，限制了其在不同任务中的泛化能力。二是直接将多个VFM蒸馏成统一的策略表示，会导致任务特定的特征选择不够灵活，并且需要昂贵的完全重新训练才能整合机器人领域的知识。

**核心思路**：VER的核心思路是构建一个视觉专家库，其中每个专家都从不同的VFM中学习到特定的视觉知识。然后，通过一个轻量级的路由网络，根据当前的任务动态地选择合适的专家组合。这种方法既能利用多个VFM的优势，又能避免完全重新训练的成本，同时还能实现任务特定的特征选择。

**技术框架**：VER的整体框架包括三个主要阶段：1) 预训练阶段：将多个VFM蒸馏到一个视觉专家库中。每个专家都是一个Transformer模块，负责处理图像的不同部分或学习不同的视觉特征。2) 路由网络训练阶段：训练一个轻量级的路由网络，用于根据当前的任务动态地选择合适的专家组合。路由网络接收图像特征作为输入，输出每个专家的权重。3) 微调阶段：使用机器人领域的数据对路由网络进行微调，以适应特定的机器人任务。

**关键创新**：VER的关键创新在于动态专家路由机制和Patchwise专家路由与课程Top-K退火策略。动态专家路由允许模型根据任务需求自适应地选择合适的专家，从而提高了模型的泛化能力。Patchwise专家路由允许模型在图像的不同区域使用不同的专家，从而提高了模型的灵活性。课程Top-K退火策略则在训练初期鼓励探索更多的专家组合，在训练后期则专注于选择最相关的专家，从而提高了模型的训练效率和性能。

**关键设计**：VER使用Transformer作为其主要架构，并采用交叉熵损失函数来训练路由网络。Patchwise专家路由将图像划分为多个patch，并为每个patch分配不同的专家组合。课程Top-K退火策略通过逐渐减小Top-K的值，来控制专家选择的范围。路由网络的参数量被控制在总参数量的0.4%以下，以保证其轻量级和高效性。

## 📊 实验亮点

VER在17个不同的机器人任务上取得了最先进的性能，显著优于现有的方法。例如，在某些任务上，VER的性能提升超过了10%。实验结果还表明，VER能够有效地减少任务无关区域的干扰，并集中于任务关键区域，从而提高了模型的鲁棒性和可靠性。

## 🎯 应用场景

VER具有广泛的应用前景，可应用于各种机器人学习任务，例如物体抓取、导航、操作等。通过利用预训练的视觉知识，VER可以显著提高机器人的学习效率和泛化能力。此外，VER还可以应用于其他需要视觉知识迁移的领域，例如自动驾驶、智能监控等。

## 📄 摘要（原文）

> Pretrained vision foundation models (VFMs) advance robotic learning via rich visual representations, yet individual VFMs typically excel only in specific domains, limiting generality across tasks. Distilling multiple VFMs into a unified representation for policy can mitigate this limitation but often yields inflexible task-specific feature selection and requires costly full re-training to incorporate robot-domain knowledge. We propose VER, a Vision Expert transformer for Robot learning. During pretraining, VER distills multiple VFMs into a vision expert library. It then fine-tunes only a lightweight routing network (fewer than 0.4% of parameters) to dynamically select task-relevant experts from the pretrained library for downstream robot tasks. We further introduce Patchwise Expert Routing with Curriculum Top-K Annealing to improve both flexibility and precision of dynamic expert selection. Moreover, VER supports parameter-efficient finetuning for scalable expert utilization and adaptive robot-domain knowledge integration. Across 17 diverse robotic tasks and multiple policy heads, VER achieves state-of-the-art performance. We find that VER reduces large-norm outliers in task-irrelevant regions (e.g., background) and concentrates on task-critical regions. Visualizations and codes can be found in https://yixiaowang7.github.io/ver_page/.

