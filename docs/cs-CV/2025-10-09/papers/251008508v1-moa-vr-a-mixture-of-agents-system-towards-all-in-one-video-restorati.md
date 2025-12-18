---
layout: default
title: MoA-VR: A Mixture-of-Agents System Towards All-in-One Video Restoration
---

# MoA-VR: A Mixture-of-Agents System Towards All-in-One Video Restoration

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.08508" class="toolbar-btn" target="_blank">📄 arXiv: 2510.08508v1</a>
  <a href="https://arxiv.org/pdf/2510.08508.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.08508v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2510.08508v1', 'MoA-VR: A Mixture-of-Agents System Towards All-in-One Video Restoration')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Lu Liu, Chunlei Cai, Shaocheng Shen, Jianfeng Liang, Weimin Ouyang, Tianxiao Ye, Jian Mao, Huiyu Duan, Jiangchao Yao, Xiaoyun Zhang, Qiang Hu, Guangtao Zhai

**分类**: cs.CV

**发布日期**: 2025-10-09

---

## 💡 一句话要点

**提出MoA-VR，一个混合Agent的通用视频修复系统，有效处理复杂退化。**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `视频修复` `混合Agent` `多模态学习` `视觉语言模型` `大型语言模型` `视频质量评估` `自适应路由`

## 📋 核心要点

1. 现有视频修复方法通常需要手动选择专门模型，或依赖于难以泛化的单体架构，无法有效处理真实场景中复杂多样的视频退化。
2. MoA-VR系统模仿人类专家，通过退化识别、路由与修复、修复质量评估三个Agent协同工作，实现对复杂退化的有效处理。
3. 实验表明，MoA-VR在客观指标和感知质量上均超越现有基线，验证了多模态智能和模块化推理在视频修复中的潜力。

## 📝 摘要（中文）

本文提出MoA-VR，首个混合Agent视频修复系统，旨在模仿专业人员的推理和处理流程，通过三个协同Agent实现：退化识别、路由与修复、修复质量评估。构建了大规模高分辨率视频退化识别基准，并构建了视觉-语言模型（VLM）驱动的退化识别器。引入由大型语言模型（LLM）驱动的自适应路由器，通过观察工具使用模式自主学习有效的修复策略。为了评估中间和最终处理的视频质量，构建了修复视频质量（Res-VQ）数据集，并设计了专门的基于VLM的视频质量评估（VQA）模型，专为修复任务定制。大量实验表明，MoA-VR能够有效处理各种复杂退化，在客观指标和感知质量方面均优于现有基线。这些结果突出了在通用视频修复系统中集成多模态智能和模块化推理的潜力。

## 🔬 方法详解

**问题定义**：现实世界的视频由于采集和传输条件的多样性，经常受到复杂的退化影响，例如噪声、压缩伪影和低光失真。现有的修复方法通常需要专业人员手动选择专门的模型，或者依赖于无法在不同退化情况下泛化的单体架构。这些方法难以应对真实场景中复杂且混合的视频退化问题。

**核心思路**：MoA-VR的核心思路是模仿人类专家进行视频修复的流程。人类专家会首先识别视频的退化类型，然后选择合适的修复工具和策略，最后评估修复质量。MoA-VR通过构建三个协同工作的Agent来实现这一过程：退化识别Agent、路由与修复Agent、修复质量评估Agent。

**技术框架**：MoA-VR系统包含三个主要模块：1) **退化识别Agent**：使用视觉-语言模型（VLM）识别视频中的退化类型。该Agent基于大规模高分辨率视频退化识别基准进行训练。2) **路由与修复Agent**：该Agent由大型语言模型（LLM）驱动，根据退化识别Agent的输出，自主选择合适的修复工具和策略。该Agent通过观察工具使用模式学习有效的修复策略。3) **修复质量评估Agent**：使用基于VLM的视频质量评估（VQA）模型评估修复后的视频质量。该Agent基于修复视频质量（Res-VQ）数据集进行训练。

**关键创新**：MoA-VR的关键创新在于其混合Agent架构和自适应路由策略。传统的视频修复方法通常使用单体模型，难以应对复杂多样的退化。MoA-VR通过将修复过程分解为三个独立的Agent，每个Agent负责不同的任务，从而提高了系统的灵活性和泛化能力。自适应路由策略允许系统根据不同的退化类型选择不同的修复工具和策略，进一步提高了修复效果。

**关键设计**：退化识别Agent使用预训练的视觉-语言模型，并针对视频退化识别任务进行微调。路由与修复Agent使用大型语言模型作为控制器，根据退化识别结果选择合适的修复工具。修复质量评估Agent使用基于VLM的视频质量评估模型，该模型针对修复任务进行了专门的训练。Res-VQ数据集包含各种退化类型和修复方法，用于训练和评估修复质量评估Agent。

## 📊 实验亮点

实验结果表明，MoA-VR在处理各种复杂退化时，在客观指标（如PSNR、SSIM）和感知质量方面均优于现有基线方法。具体而言，MoA-VR在多个视频修复数据集上取得了显著的性能提升，证明了其有效性和泛化能力。

## 🎯 应用场景

MoA-VR可应用于各种视频修复场景，例如老旧视频修复、监控视频增强、低质量视频修复等。该系统能够有效提高视频的视觉质量，提升用户体验。未来，MoA-VR有望集成到各种视频处理平台和应用中，为用户提供更加便捷高效的视频修复服务。

## 📄 摘要（原文）

> Real-world videos often suffer from complex degradations, such as noise, compression artifacts, and low-light distortions, due to diverse acquisition and transmission conditions. Existing restoration methods typically require professional manual selection of specialized models or rely on monolithic architectures that fail to generalize across varying degradations. Inspired by expert experience, we propose MoA-VR, the first \underline{M}ixture-\underline{o}f-\underline{A}gents \underline{V}ideo \underline{R}estoration system that mimics the reasoning and processing procedures of human professionals through three coordinated agents: Degradation Identification, Routing and Restoration, and Restoration Quality Assessment. Specifically, we construct a large-scale and high-resolution video degradation recognition benchmark and build a vision-language model (VLM) driven degradation identifier. We further introduce a self-adaptive router powered by large language models (LLMs), which autonomously learns effective restoration strategies by observing tool usage patterns. To assess intermediate and final processed video quality, we construct the \underline{Res}tored \underline{V}ideo \underline{Q}uality (Res-VQ) dataset and design a dedicated VLM-based video quality assessment (VQA) model tailored for restoration tasks. Extensive experiments demonstrate that MoA-VR effectively handles diverse and compound degradations, consistently outperforming existing baselines in terms of both objective metrics and perceptual quality. These results highlight the potential of integrating multimodal intelligence and modular reasoning in general-purpose video restoration systems.

