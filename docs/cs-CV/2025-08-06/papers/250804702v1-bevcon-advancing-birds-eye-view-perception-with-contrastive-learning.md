---
layout: default
title: BEVCon: Advancing Bird's Eye View Perception with Contrastive Learning
---

# BEVCon: Advancing Bird's Eye View Perception with Contrastive Learning

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2508.04702" class="toolbar-btn" target="_blank">📄 arXiv: 2508.04702v1</a>
  <a href="https://arxiv.org/pdf/2508.04702.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2508.04702v1" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2508.04702v1', 'BEVCon: Advancing Bird\'s Eye View Perception with Contrastive Learning')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Ziyang Leng, Jiawei Yang, Zhicheng Ren, Bolei Zhou

**分类**: cs.CV

**发布日期**: 2025-08-06

**期刊**: IEEE Robotics and Automation Letters (Volume: 10, Issue: 4, April 2025)

---

## 💡 一句话要点

**提出BEVCon以提升自动驾驶中的鸟瞰视图感知**

🎯 **匹配领域**: **支柱二：RL算法与架构 (RL & Architecture)**

**关键词**: `鸟瞰视图` `对比学习` `自动驾驶` `特征优化` `3D物体检测` `表示学习` `深度学习`

## 📋 核心要点

1. 现有方法主要集中在BEV编码器和任务特定头部的增强，未充分挖掘表示学习的潜力。
2. BEVCon通过引入实例特征对比模块和视角对比模块，优化BEV特征和图像主干网络。
3. 在nuScenes数据集上，BEVCon实现了最高2.4%的mAP提升，展示了表示学习的重要性。

## 📝 摘要（中文）

我们提出了BEVCon，这是一个简单而有效的对比学习框架，旨在改善自动驾驶中的鸟瞰视图（BEV）感知。BEV感知提供了周围环境的俯视图表示，对于3D物体检测、分割和轨迹预测任务至关重要。尽管以往的研究主要集中在增强BEV编码器和任务特定头部上，我们则关注于BEV模型中表示学习的潜力。BEVCon引入了两个对比学习模块：实例特征对比模块用于优化BEV特征，视角对比模块增强了图像主干网络。基于检测损失的密集对比学习设计提升了BEV编码器和主干网络的特征表示。在nuScenes数据集上的广泛实验表明，BEVCon在性能上取得了一致的提升，较最先进的基线提高了2.4%的mAP。我们的结果强调了表示学习在BEV感知中的关键作用，并为传统的任务特定优化提供了补充途径。

## 🔬 方法详解

**问题定义**：本论文旨在解决现有BEV感知方法在表示学习方面的不足，尤其是缺乏对比学习的应用，导致特征表示不够优化。

**核心思路**：BEVCon的核心思路是通过对比学习模块来提升BEV特征的质量，利用实例特征和视角对比来增强模型的表示能力，从而提高感知性能。

**技术框架**：BEVCon的整体架构包括两个主要模块：实例特征对比模块和视角对比模块。实例特征对比模块专注于优化BEV特征，而视角对比模块则增强图像主干网络的特征提取能力。

**关键创新**：BEVCon的创新之处在于引入了密集对比学习机制，结合检测损失来优化特征表示，这在以往的BEV模型中尚未得到充分探索。

**关键设计**：在设计中，采用了特定的损失函数来平衡对比学习和任务特定损失的影响，确保模型在特征学习和任务执行之间的有效协同。

## 📊 实验亮点

在nuScenes数据集上的实验结果显示，BEVCon在mAP指标上较最先进的基线提升了2.4%，证明了其在BEV感知任务中的有效性。这一提升不仅展示了对比学习的潜力，也强调了表示学习在复杂场景中的重要性。

## 🎯 应用场景

该研究的潜在应用领域包括自动驾驶、智能交通系统和机器人导航等。通过提升BEV感知的准确性，BEVCon能够为自动驾驶车辆提供更可靠的环境理解，从而提高安全性和效率。未来，该框架还可能扩展到其他需要空间感知的领域，如无人机监控和城市规划等。

## 📄 摘要（原文）

> We present BEVCon, a simple yet effective contrastive learning framework designed to improve Bird's Eye View (BEV) perception in autonomous driving. BEV perception offers a top-down-view representation of the surrounding environment, making it crucial for 3D object detection, segmentation, and trajectory prediction tasks. While prior work has primarily focused on enhancing BEV encoders and task-specific heads, we address the underexplored potential of representation learning in BEV models. BEVCon introduces two contrastive learning modules: an instance feature contrast module for refining BEV features and a perspective view contrast module that enhances the image backbone. The dense contrastive learning designed on top of detection losses leads to improved feature representations across both the BEV encoder and the backbone. Extensive experiments on the nuScenes dataset demonstrate that BEVCon achieves consistent performance gains, achieving up to +2.4% mAP improvement over state-of-the-art baselines. Our results highlight the critical role of representation learning in BEV perception and offer a complementary avenue to conventional task-specific optimizations.

