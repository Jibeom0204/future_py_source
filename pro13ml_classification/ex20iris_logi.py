# logistocRegression - 다항분류(softmax 함수 사용) - iris_data로 실습
# softmax 함수는 인공지능의 Mult-Class-Classification 문제에서 출력층에 주로 사용

import pandas as pd
import numpy as np
from sklearn import datasets
from sklearn.model_selection import train_test_split
from sklearn.metrics import accuracy_score,confusion_matrix
from sklearn.preprocessing import StandardScaler,MinMaxScaler # 표준화 정규화
from sklearn.linear_model import LogisticRegression
# LogisticRegression : 이항 분류 뿐 아니라 다중 클래스를 지원함
iris = datasets.load_iris()
print(iris.keys())
print(iris.target)
print(iris.data[:3])
print(np.corrcoef(iris.data[:,2], iris.data[:,3])[0,1]) #0.96286 2열은 꽃잎길이 3열은 꽃잎너비

x=iris.data[:,[2,3]] # 꽃입의 length와 width만 이용, data의 2열,3열만 골라 x에 저장
y=iris.target
print(x.shape,y.shape) # shape: 배열의 크기를 튜플로 표현. sklearn은 x에2차원y에 1차원을 요구(150,2)(150,) 
print(x[:3], y[:3], set(map(int,y))) # 꽃의 종류는 3가지 {0, 1, 2}. set(): 중복제거 map(함수, 반복가능객체)는 y의 각 원소에 int를 적용하는 반복자

print("\n\n 학습, 시험 데이터 나누기(7:3)")
x_train, x_test, y_train, y_test = train_test_split(x,y,test_size=0.3, random_state=0)
print("shape 보기", x_train.shape, x_test.shape, y_train.shape, y_test.shape)
print(x_train[:3],x_test[:3],y_train[:3],y_test[:3],)

# # Scaling (데이터 크기 표준화/정규화-최적화 과정에서 안정성, 수렴속도 향상, 과적합, 과소적합 방지 등의 효과)
# sc=StandardScaler() # 표준화
# sc.fit(x_train) # fit(x): 열마다 평균과 표준편차를 계산해서 scaler 객체 안에 저장
# sc.fit(x_test)  # feature만 스케일링한다.lable은 스케일하면 안된다. 또한 학습 데이터와 검증 데이터에 대해서 feature가 동일해야해서 둘다 스케일링해준다 

# x_train=sc.transform(x_train) #transform(x): 저장된 평균/표준편차로 실제로 값을 바꾼 새 배열을 반환
# x_test=sc.transform(x_test)
# print(x_train[:3])
# print(x_test[:3])

# # 스케일링 원복
# ori_x_train=sc.inverse_transform(x_train)
# print("원복",ori_x_train[:3])
# 스케일링이 필요한 이유: 특성마다 값의 크기 범위가 다르면 경사하강법 같은 최적화에서 느려지거나 불안정해짐
# 또는 L2 규제 쓰는 모델은 규제 영향이 큼
# 표준화: 평균0 표준편차1  정규화: 정규 분포 0~1범위


print('분류 모델 생성======')
model=LogisticRegression(random_state=0)
model=LogisticRegression(C=1.0, # 모델에 패널티 적용(L2 규제), 숫자값을 조정해 가며 확인(숫자가 클수록 규제가 약해짐) 
                         solver='lbfgs', # 최적화 알고리즘 방식 중 하나
                         # multi_class='multinomial', # softmax 지원. 최근 버전에서는 굳이 안써도됨
                         max_iter=100, # 최적화 알고리즘을 찾는 최대 반복 횟수
                         random_state=0) 
print(model)
model.fit(x_train,y_train) # train으로 학습

# 분류 예측
y_pred = model.predict(x_test) # x_test로 예측.
# LogisticRegression 클래스로 선언된 변수에서 x_test 변수를 입력으로 predict 예측 메서드를 실행한 결과를 저장
print('예측값: ',y_pred)
print("실제값: ", y_test)
print(f'총 갯수:{len(y_test)}, 오류수:{(y_test!=y_pred).sum()}') #총 갯수:45, 오류수:1

print("\n분류 정확도========\n")
conf_mat=confusion_matrix(y_test,y_pred)
print("혼동행렬 : \n", conf_mat)
# print("\nconf_mat 결과_분류 정확도", (conf_mat[0][0]+conf_mat[1][1]) /len(y_test)) # 데이터가 3개짜리라 못구함. 2행 2열만 가능
print("클래스가 다항인 경우 분류 정확도: ",np.trace(conf_mat)/np.sum(conf_mat)) # 클래스가 다항인 경우 사용


print(f'\n\n{accuracy_score(y_test,y_pred)}') #0.97777
print(f'train_score:{model.score(x_train,y_train)}') #0.97142
print(f'test_score:{model.score(x_test,y_test)}') #0.9777
# train score와 test score의 차이가 크면 과적합 의심


# 학습 후 검증이 끝난 모델 저장 후 읽기
import joblib
joblib.dump(model, 'ex20model.sav') # 확장자 .sav말고 .model도 가능
# ================================================================
read_model=joblib.load('ex20model.sav')
print("완성된 모델 출력: ",read_model) #LogisticRegression(random_state=0)

print("새 값으로 예측하기")
new_data = np.array([[5.5,2.2],[0.8,0.9],[8.5,6.2]])  # ==> 이 데이터로 예측한 결과 = 예측결과:  [2 0 2]
# new_data = np.array([[5.5,2.2]]) # 헷갈릴 수 있으니 일단 하나만 사용. # ==> 이 데이터로 예측한 결과 = 예측결과:  [2]
# 만약 원래 모델에 사용한 데이터가 표준화되어 feature된 모델을 생성했다면
# new_data도 표준화 해야함. 안한다면?
# sc=StandardScaler() # 표준화
# sc.fit(new_data) # 새 데이터도 표준화
# new_data=sc.transform(new_data) # 위에서 주석처리했으니 얘도 실제로 표준화 하지는 않음

new_pred=read_model.predict(new_data)
print('예측결과: ',new_pred) #
print(read_model.predict_proba(new_data)) 
#예측결과:  [2]
# [[2.53496435e-05 5.43511967e-02 9.45623454e-01]]
# 예측결과의 [2]는 꽃의 종류는 3가지 {0, 1, 2} 데이터의 번호가 아니라
# [[2.53496435e-05 5.43511967e-02 9.45623454e-01]] 이 확률값 중 가장 큰 것을 연산한 것의 "인덱스 번호"



# iris dataset 분류 연습용 시각화 코드_카페에서 가져옴
import matplotlib.pyplot as plt

import koreanize_matplotlib
from matplotlib.colors import ListedColormap

def plot_decision_regionFunc(X, y, classifier, test_idx=None, resolution=0.02, title=''):
    markers = ('s', 'x', 'o', '^', 'v')      # 마커 표시 모양 5개 정의
    colors = ('r', 'b', 'lightgreen', 'gray', 'cyan')
    cmap = ListedColormap(colors[:len(np.unique(y))])
    #print('cmap : ', cmap.colors[0], cmap.colors[1], cmap.colors[2])

    # decision surface 그리기
    x1_min, x1_max = X[:, 0].min() - 1, X[:, 0].max() + 1
    x2_min, x2_max = X[:, 0].min() - 1, X[:, 0].max() + 1
    xx, yy = np.meshgrid(np.arange(x1_min, x1_max, resolution), np.arange(x2_min, x2_max, resolution))

    # xx, yy를 ravel()를 이용해 1차원 배열로 만든 후 전치행렬로 변환하여 퍼셉트론 분류기의 
    # predict()의 인자로 입력하여 계산된 예측값을 Z로 둔다.
    Z = classifier.predict(np.array([xx.ravel(), yy.ravel()]).T)
    Z = Z.reshape(xx.shape)   # Z를 reshape()을 이용해 원래 배열 모양으로 복원한다.

    # X를 xx, yy가 축인 그래프 상에 cmap을 이용해 등고선을 그림
    plt.contourf(xx, yy, Z, alpha=0.5, cmap=cmap)   
    plt.xlim(xx.min(), xx.max())
    plt.ylim(yy.min(), yy.max())

    X_test = X[test_idx, :]
    for idx, cl in enumerate(np.unique(y)):
        plt.scatter(x=X[y==cl, 0], y=X[y==cl, 1], color=cmap(idx), marker=markers[idx], label=cl)

    if test_idx:
        X_test = X[test_idx, :]
        plt.scatter(X_test[:, 0], X_test[:, 1], c=[], linewidth=1, marker='o', s=80, label='testset')

    plt.xlabel('꽃잎 길이')
    plt.ylabel('꽃잎 너비')
    plt.legend(loc=2)
    plt.title(title)
    plt.show()

x_combined_std = np.vstack((x_train, x_test))
y_combined = np.hstack((y_train, y_test))
plot_decision_regionFunc(X=x_combined_std, y=y_combined, classifier=read_model, test_idx=range(105, 150), title='scikit-learn제공') 