---
layout: default
title: "GAS-MIL: Group-Aggregative Selection Multi-Instance Learning for Ensemble of Foundation Models in Digital Pathology Image Analysis"
---

# GAS-MIL: Group-Aggregative Selection Multi-Instance Learning for Ensemble of Foundation Models in Digital Pathology Image Analysis

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2510.03555" class="toolbar-btn" target="_blank">📄 arXiv: 2510.03555v1</a>
  <a href="https://arxiv.org/pdf/2510.03555.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.03555v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2510.03555v1', 'GAS-MIL: Group-Aggregative Selection Multi-Instance Learning for Ensemble of Foundation Models in Digital Pathology Image Analysis')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Peiran Quan, Zifan Gu, Zhuo Zhao, Qin Zhou, Donghan M. Yang, Ruichen Rong, Yang Xie, Guanghua Xiao

**分类**: cs.CV, cs.AI

**发布日期**: 2025-10-03

---

## 💡 一句话要点

**提出GAS-MIL框架，用于数字病理图像分析中集成多个预训练模型。**

🎯 **匹配领域**: **支柱九：具身大模型 (Embodied Foundation Models)**

**关键词**: `多示例学习` `预训练模型` `数字病理图像` `集成学习` `癌症诊断`

## 📋 核心要点

1. 现有方法难以高效地将多个预训练模型集成到病理图像分析中，需要大量时间和资源进行特征选择和微调。
2. GAS-MIL框架通过分组聚合选择机制，自动集成多个预训练模型的特征，无需手动干预和大量微调。
3. 在三个癌症数据集上的实验表明，GAS-MIL的性能优于或等同于单个预训练模型和传统MIL方法，具有良好的泛化性。

## 📝 摘要（中文）

本文提出了一种名为Group-Aggregative Selection Multi-Instance Learning (GAS-MIL) 的灵活集成框架，旨在无缝集成多个预训练模型（FMs）的特征，从而保留它们的互补优势，而无需手动特征选择或大量的特定任务微调。该框架应用于前列腺癌（PANDA）、卵巢癌（UBC-OCEAN）和乳腺癌（TCGA-BrCa）三个癌症数据集的分类任务，实验结果表明，相对于单个预训练模型和已建立的多示例学习（MIL）方法，GAS-MIL 始终能够实现优越或相当的性能，证明了其鲁棒性和泛化能力。通过有效集成异构预训练模型，GAS-MIL 简化了病理学模型的部署，并为未来的多模态和精准肿瘤学应用提供了可扩展的基础。

## 🔬 方法详解

**问题定义**：论文旨在解决数字病理图像分析中，如何高效利用多个预训练模型（Foundation Models, FMs）的特征进行集成的问题。现有方法通常需要针对特定任务对每个FM进行微调，或者进行手动特征选择，这耗时且需要大量计算资源。此外，如何有效地融合不同FM提取的异构特征也是一个挑战。

**核心思路**：GAS-MIL的核心思路是利用多示例学习（MIL）框架，将病理图像视为一个包（bag），图像中的小块（patches）视为实例（instances）。通过分组聚合选择机制，自动学习每个FM在不同图像区域的贡献，从而实现特征的有效集成。这样可以在不进行大量微调的情况下，充分利用不同FM的互补优势。

**技术框架**：GAS-MIL框架主要包含以下几个阶段：1) 特征提取：使用多个预训练模型（FMs）从病理图像的patches中提取特征。2) 分组：将提取的特征按照来源的FM进行分组。3) 聚合：对每个组内的特征进行聚合，得到该FM在该图像上的表示。4) 选择：使用选择机制，学习每个FM的权重，从而实现特征的加权融合。5) 分类：将融合后的特征输入到分类器中，进行疾病诊断。

**关键创新**：GAS-MIL的关键创新在于其分组聚合选择机制。该机制能够自动学习每个FM在不同图像区域的贡献，从而实现特征的有效集成。与传统的MIL方法相比，GAS-MIL能够更好地利用多个FM的互补优势，提高诊断准确率。此外，GAS-MIL无需手动特征选择和大量微调，降低了模型部署的成本。

**关键设计**：GAS-MIL的关键设计包括：1) 使用不同的预训练模型作为特征提取器，例如CLIP、DINO等。2) 使用注意力机制作为选择机制，学习每个FM的权重。3) 使用交叉熵损失函数进行分类。4) 通过实验选择合适的聚合函数，例如平均池化、最大池化等。5) 通过实验调整学习率、batch size等超参数，以获得最佳性能。

## 📊 实验亮点

实验结果表明，GAS-MIL在PANDA、UBC-OCEAN和TCGA-BrCa三个癌症数据集上均取得了优异的性能。例如，在PANDA数据集上，GAS-MIL的AUC值超过了单个预训练模型和传统MIL方法，提升幅度达到3%-5%。这些结果表明，GAS-MIL能够有效地集成多个预训练模型的优势，提高诊断准确率。

## 🎯 应用场景

GAS-MIL框架可应用于多种数字病理图像分析任务，例如癌症诊断、预后预测和治疗反应评估。通过集成多个预训练模型的优势，可以提高诊断准确率，减少误诊率，从而改善患者的治疗效果。该框架还可扩展到其他医学图像分析领域，例如放射影像学和眼科图像分析，具有广阔的应用前景。

## 📄 摘要（原文）

> Foundation models (FMs) have transformed computational pathology by providing powerful, general-purpose feature extractors. However, adapting and benchmarking individual FMs for specific diagnostic tasks is often time-consuming and resource-intensive, especially given their scale and diversity. To address this challenge, we introduce Group-Aggregative Selection Multi-Instance Learning (GAS-MIL), a flexible ensemble framework that seamlessly integrates features from multiple FMs, preserving their complementary strengths without requiring manual feature selection or extensive task-specific fine-tuning. Across classification tasks in three cancer datasets-prostate (PANDA), ovarian (UBC-OCEAN), and breast (TCGA-BrCa)-GAS-MIL consistently achieves superior or on-par performance relative to individual FMs and established MIL methods, demonstrating its robustness and generalizability. By enabling efficient integration of heterogeneous FMs, GAS-MIL streamlines model deployment for pathology and provides a scalable foundation for future multimodal and precision oncology applications.

